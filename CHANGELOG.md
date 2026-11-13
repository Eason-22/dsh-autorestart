# Changelog

中文 / English

## 0.9.7 — 2026-11-13

这一版重做了「谁该被缴械 / 谁该被唤醒 / 什么相位算什么状态」这一整套判据：把依据从**过程量**（可变时间戳、活目标的瞬时态）换成**归属量**（这条记录是哪一轮写的、后来谁把它 arm 回去的）。它修掉三个各自独立的真机 bug，补上审计查出的五处覆盖空洞，并把「恢复尝试预算」从按会话终生计改成按开机周期计。

### 一、重启后目标被缴械却不恢复（修正）

**原来错在哪**：开机认领时用 `restart.requestedAt` 当「本轮重启周期」的身份（`if (at < requestAt) continue`）。这个字段会被后来的请求者整体替换 `state.restart`、也会被 `defer_seconds` 推到未来，于是**先发生的缴械被判成历史旧账**，进不了恢复队列——开机连恢复都不尝试。现场反证：若该字段还是首个请求者的时间，同一条记录就会被认领。

**现在**：周期身份改用**归属量** `restartCycleStartedAt`（每次新周期写一次，谁都不许改写），时间戳只留 24 小时兜底。

### 二、排队期每 3 秒把已被重新 arm 的目标再缴一次（修正）

**原来错在哪**：`disarmBlockingGoals` 每 3000ms 扫一遍忙会话，而 `selectGoalDisarms` 按设计只看活目标、显式不让 checkpoint 记录否决；被重新 arm 的目标下一个 tick 又挨一刀，覆盖写时还把 `reason` 抹掉、`resumedAt` 清成 null，界面上永远显示「已暂停」。

**现在**：记录里写 `reason` / `cycle` / `goalRevision` / `tookBackAt`；**用户手动 arm 回来的目标记为「夺回」**，本轮排队不再缴它。

### 三、目标已完成的会话每次开机都被叫醒（修正）

**原来错在哪**：`GOAL_STOPPED_PHASES` 少了 `complete`，于是「目标做完了」被当成「还有待办」，每次开机都排一条续跑消息。真机证据：一个会话跑到第 176 轮。

**现在**：`complete` 归入「停住」。但**不一刀切**——另加 `pendingSource` 区分待办来历：

| 待办来历 | 目标 complete 时 |
|---|---|
| `boot-interrupted` / `restart-requested`（**用户那一轮被打断**） | **仍然续跑**：目标没活儿不等于用户那条消息有答案 |
| `adoption` / `disposed`（目标侧，没有东西可给回） | 保持安静 |

老状态文件没有这个标记时按记录推导：有缴械/停放记录 ⇒ `adoption`，否则 ⇒ `boot-interrupted`。

### 四、恢复尝试预算改为按开机周期计（修正）

**原来错在哪**：`resumeAttempts` 只在 `markPendingResume` 与 `recoverNow(force)` 里重置。一个**开机时没在跑、之后也没有新待办**的会话永远拿不到重置机会，一次临时故障（别的插件崩了一次）就把它的恢复能力永久废掉——代码自己的注释却写着 `At-most-once per boot`。真机证据：一个会话两次尝试都撞在别的插件的 `read_image` 重复注册错误上，之后两天再没被尝试过。

**现在**：`beginBoot` 给每个会话一份新预算；预算用光时**不再清 `pendingResume`**（清了的话下一个开机的新预算无处可用）。代价是有意选的：**永久坏掉的会话每次开机再试最多 2 次，代价有界、失败原因一直可见；而永久丢弃一个可恢复的会话是静默的数据丢失。**

### 五、人工恢复的目标不再被二次缴械（修正）

**原来错在哪**：`isGoalTakenBackByUser` 见到 `resumedAt` 就返回 false（注释写着「插件自己还回去的目标可以被再次缴械」）。可人工恢复（`continuum_recover_now`）只写 `resumedAt`、不写 `tookBackAt`，于是**人点的恢复 3 秒后就被打回**。真机证据：09:19:41 恢复成功，09:22:14 又被缴械。

**现在**：人工入口成功后补写 `tookBackAt` ⇒ 立刻被认成「人的介入」⇒ 重启前不再被缴械。开机自动恢复仍只写 `resumedAt` ⇒ 新周期照常可以再缴。

界面上：胶囊出现「· 目标被手动恢复，不再停止」，tooltip 说明「被停止的目标已被人工恢复，插件不再二次停止，需人工停止」。

### 六、缴械时机：请求者还没停就不缴别人（修正）

**原来错在哪**：重启排队期间，3 秒轮询对**所有正在跑的会话**缴械。可发起重启的会话自己还在跑时，重启根本不可能执行，这时候缴别人**一点用都没有**——只会让没发起重启的会话白等（现场等了 28 分钟）。

**现在**：从 `restart.requesters` 取请求者集合，**只要还有请求者在跑就一条都不缴**（返回 `skipped: 'requesters-still-running'`）；等它们全停了才开始缴「没发起重启」的会话。请求者自己「请求那一刻当场缴械」的行为**不变**——那是主代理自己控制何时停。

界面上：废弃「· 被某个自动续跑的 goal 占着」，统一用「· 已停泊 {n} 个 goal，重启后自动继续」（n 可以为 0，覆盖从 0 到全部停泊的全过程）。

### 七、历史遗留被锁死的 goal 可以被人工解锁（新增）

**原来错在哪**：24 小时年龄上限把老记录挡在自动认领之外（这是对的），但**手动恢复也一起被挡住了**——`recoverNow` 只认 `pendingResume`，而这些记录早被清成 false ⇒ 用户点了没反应，返回 `no-pending-recovery`。

**现在**：手动点名恢复时，只要该会话有一条**插件自己写的**缴械记录（`restart-queued` / `restart-blocking`、未 resumed、当前不在跑），就当作待恢复处理。

**三条边界**（一条都不越）：

- **插件绝不主动恢复**：自动认领路径与 24 小时上限一个字没改。
- **不碰用户主动暂停的**（`parkedGoals`）：那是用户停的，不是插件锁的。
- **不解锁没有 `reason` 的上一代记录**：那不是插件锁的。

### 八、覆盖补齐与文案（新增）

审计（只读）把「相位 × 来源」5×5 表摊平后发现的空洞，逐格补上行为用例：`U1`（complete × restart-requested 仍续跑）、`U2`（complete × disposed 仍续跑，两处自相矛盾的注释改成同一口径）、`U3`（相位快照陈旧时的取舍，只钉现状不改行为）、`U4`（老文件的来源推导改成「更近者胜出」）、`U5`（blocked 走恢复层保持安静、phase 缺失仍 fail-closed）。

测试数 **1191 → 1232**，全部通过。

### 九、自己发起重启的会话，不该被暂停的目标一起憋死（修正）

**原来错在哪**：`shouldStayQuiet()` 第一条就是 `if (isGoalStopped(goal)) return true`——目标 `paused` / `blocked` 就一律安静，**把「这次重启是谁要求的」这个已有的信息整个盖掉了**。可 `PENDING_SOURCES` 里早就写着 `restart-requested` 的含义是「**这个会话自己**要求了重启」：一个会话不会无缘无故在干活干到一半时要求重启，它要求重启，就是希望重启完继续。

真机证据：`session-0cde21f1` 的 `pendingSource` 正是 `restart-requested`，但它的目标处于 `paused`，于是开机判成 `goal-stopped` / 「the user stopped this goal: the session stays quiet」，把它要求重启去继续的活吞了。

**现在**：`shouldStayQuiet()` 先看来源——`restart-requested` 直接返回「不必安静」，不再因目标相位短路；其余来源（`boot-interrupted` / `adoption` / `disposed` / 缺失）行为**一个字没变**。

**边界：唤醒 ≠ 继续目标。** 这条只让会话能接着说话，**不会**把暂停的目标重新武装——重新武装的三个分支都要求 `phase === 'active'`，`paused` 目标永远走不到那里，不会产生新的目标轮。**用户自己暂停的目标仍然是暂停的。**

| 目标相位 | 谁发起这次重启 | 结果 |
|---|---|---|
| `paused` / `blocked` | **它自己** | **会话被唤醒**（目标仍暂停） |
| `paused` / `blocked` | 别人 | 保持安静（原行为） |
| `active` | 任何人 | 恢复/重新武装（原行为） |
| `complete` | 看来源（U1/U2 的既有口径） | 不变 |

测试数 **1232 → 1241**（新增 9 条），全部通过。

### English

This release reworks the whole "who gets disarmed / who gets woken / which phase counts as stopped" set of judgements: it moves the evidence from **process quantities** (mutable timestamps, the momentary state of a live goal) to **ownership quantities** (which restart cycle wrote this record, and who armed the goal back afterwards). It fixes three independent real-machine bugs, closes five coverage holes found by an audit, and changes the resume-attempt budget from "once per session, for ever" to "once per boot cycle".

#### 1. A goal disarmed by a restart was never resumed (fix)

**What was wrong**: boot adoption used `restart.requestedAt` as the identity of "this restart cycle" (`if (at < requestAt) continue`). That field is replaced wholesale when a later requester rewrites `state.restart`, and `defer_seconds` can push it into the future, so a disarm that happened *earlier* was judged an old leftover and never entered the resume queue — boot did not even try.

**Now**: the cycle identity is the ownership quantity `restartCycleStartedAt` (written once per cycle, rewritten by nobody); the timestamp survives only as a 24-hour fallback.

#### 2. The 3-second loop disarmed a goal again right after it had been re-armed (fix)

**What was wrong**: `disarmBlockingGoals` scans busy sessions every 3000 ms, and `selectGoalDisarms` deliberately looks only at live goals and never lets a checkpoint record veto it — so a goal the user had armed back was disarmed again on the next tick, and the overwrite wiped `reason` and nulled `resumedAt`, leaving the UI saying "paused" for ever.

**Now**: records carry `reason` / `cycle` / `goalRevision` / `tookBackAt`; **a goal armed back by hand is recorded as taken back** and is not disarmed again during that queueing round.

#### 3. Sessions whose goal was complete were woken on every boot (fix)

**What was wrong**: `GOAL_STOPPED_PHASES` lacked `complete`, so "this goal is done" read as "there is still work pending" and every boot queued a continuation. Real-machine evidence: one session reached round 176.

**Now**: `complete` counts as stopped — but not blindly. `pendingSource` decides:

| Where the pending work came from | Goal complete |
|---|---|
| `boot-interrupted` / `restart-requested` (**the user's own turn was interrupted**) | **still resumes** — a finished goal does not mean that message got an answer |
| `adoption` / `disposed` (goal side, nothing to hand back) | stays quiet |

Old state files without that marker derive it from the records: a disarm/park record means `adoption`, otherwise `boot-interrupted`.

#### 4. The resume-attempt budget is now counted per boot cycle (fix)

**What was wrong**: `resumeAttempts` was reset only by `markPendingResume` and `recoverNow(force)`. A session that was not running at boot and had no new pending work never got a reset — one transient failure (another plugin crashing once) permanently destroyed its ability to recover, while the code's own comment claimed `At-most-once per boot`.

**Now**: `beginBoot` hands every session a fresh budget; an exhausted budget **no longer clears `pendingResume`**. The cost is deliberate: **a permanently broken session is retried at most twice per boot — bounded, with the reason always visible; permanently dropping a recoverable session is silent data loss.**

#### 5. A goal recovered by hand is no longer disarmed again (fix)

**What was wrong**: `isGoalTakenBackByUser` returned false as soon as `resumedAt` was set (its comment said a goal the plugin handed back may be disarmed again). But a manual recovery (`continuum_recover_now`) wrote only `resumedAt`, never `tookBackAt`, so **a human recovery was undone 3 seconds later**. Real-machine evidence: recovered at 09:19:41, disarmed again at 09:22:14.

**Now**: the manual entry also writes `tookBackAt`, so the recovery is read as "a human intervened" and the goal is not disarmed before the restart. The automatic boot recovery still writes only `resumedAt`, so a new cycle may disarm it as before.

UI: the capsule shows "· 目标被手动恢复，不再停止", and the tooltip explains that the goal was recovered by hand and the plugin will not stop it a second time.

#### 6. Disarm timing: nobody is disarmed while a requester is still running (fix)

**What was wrong**: while a restart was queued, the 3-second loop disarmed **every running session**. But while the requesting sessions themselves are still running the restart cannot execute at all, so disarming anybody else achieves nothing except making sessions that never asked wait (28 minutes on the real machine).

**Now**: the requester set comes from `restart.requesters`; **as long as one requester is still running nothing is disarmed** (`skipped: 'requesters-still-running'`), and only once they have all stopped does the plugin start disarming sessions that did not ask. The requester's own "disarm at the moment it asks" is **unchanged** — that is the main agent deciding when to stop by itself.

UI: "· 被某个自动续跑的 goal 占着" is gone; one sentence covers everything, "· 已停泊 {n} 个 goal，重启后自动继续" (n may be 0).

#### 7. A legacy locked goal can be unlocked by hand (new)

**What was wrong**: the 24-hour age cap correctly keeps old records out of automatic adoption, but it blocked **manual** recovery too — `recoverNow` only looked at `pendingResume`, which those records had long been cleared to false, so a user clicking recover got `no-pending-recovery`.

**Now**: a named manual recovery accepts a disarm record **written by the plugin itself** (`restart-queued` / `restart-blocking`, not resumed, not currently running) and treats it as pending.

**Three boundaries**, none crossed:

- **The plugin never recovers on its own**: the automatic adoption path and the 24-hour cap are untouched.
- **Goals the user paused themselves** (`parkedGoals`) are not touched — those were stopped by the user, not locked by the plugin.
- **Records without `reason` from the previous generation are not unlocked** — those were not locked by the plugin either.

#### 8. Coverage and wording (new)

The audit (read-only) flattened the 5×5 "phase × source" table and filled the holes with behaviour cases: `U1` (complete × restart-requested still resumes), `U2` (complete × disposed still resumes; two contradictory comments now say the same thing), `U3` (what wins when the phase snapshot is stale — pinned as-is, behaviour unchanged), `U4` (deriving the source for old files now takes the nearer of the two), `U5` (blocked stays quiet through the resume layer; a missing phase still fails closed).

Tests **1191 → 1232**, all passing.

#### 9. A session that asked for the restart is not held hostage by its own paused goal (fix)

**What was wrong**: the first line of `shouldStayQuiet()` was `if (isGoalStopped(goal)) return true` — a `paused` / `blocked` goal meant "stay quiet" regardless of **who asked for this restart**, even though `PENDING_SOURCES` has always said `restart-requested` means "**this** session asked for the restart itself". A session does not ask for a restart halfway through its work for no reason; asking means it wants to continue afterwards.

Real-machine evidence: `session-0cde21f1` had `pendingSource` = `restart-requested` while its goal was `paused`, so boot judged it `goal-stopped` ("the user stopped this goal: the session stays quiet") and swallowed the work it had asked to continue.

**Now**: `shouldStayQuiet()` looks at the source first — `restart-requested` means "no need to stay quiet" and no longer short-circuits on the goal phase; every other source (`boot-interrupted` / `adoption` / `disposed` / missing) behaves exactly as before.

**Boundary: waking the session is not continuing the goal.** This only lets the session talk again; it does **not** re-arm a paused goal — all three re-arm branches require `phase === 'active'`, so a `paused` goal never reaches them and no new goal round is produced. **A goal the user paused stays paused.**

| Goal phase | Who asked for this restart | Result |
|---|---|---|
| `paused` / `blocked` | **itself** | **the session wakes** (the goal stays paused) |
| `paused` / `blocked` | somebody else | stays quiet (unchanged) |
| `active` | anyone | resume / re-arm (unchanged) |
| `complete` | by source (the U1/U2 rule) | unchanged |

Tests **1232 → 1241** (9 new), all passing.

---

## 0.9.6 — 2026-11-11

这一版给「重启前等什么」补上了两个**装插件**的信号（市场在装、插件目录在动），并修掉了它们带来的四处判据缺陷：
关机闸的目标判定、市场阻塞的上限、设置页三个新键存不下、开机时被缴的目标收不回来。另有两处小修、两轮设置页重排
（默认改成后台运行）、关机倒计时默认值 20 → 10 秒，以及文档对齐。

### 一、市场安装探测：重启与关机都等市场装完（新增）

**问题**：市场（`dshmarket`）装/升级插件时，它的 pnpm 还在跑、后面还有重定向与校验——此时把宿主重启了，留下的是**装了一半的插件**。以前的闸门根本不知道有这回事。

**现在**：闸门会问市场一句「你在装东西吗」。

- 一次**只读**的 `GET`（本宿主自己的状态路由 `/dsh-market/status`；`marketStatusUrl` 可以指到别处）。不带头、不重试、不写任何东西。
- `busy` 或 `active` 就是「在装」；**读不到的答复一律算「没在装」**——超时、404（市场压根没装）、非 2xx、body 不是一个对象，全都按「没在装」处理，重启照旧往下走。**看不见的探针绝不能拿宿主当人质。**
- 一次探针最多 **800 毫秒**（`marketProbeTimeoutMs`：可以调短，不能调过 800）；等待期间每 **1500 毫秒**问一次（`marketProbeIntervalMs`）。
- 市场说「装完了」之后**还再等 15 秒**（`marketInstallCooldownMs`），跨过它队列里两次操作之间的空档。
- **收工关机用同一套判据**：关机把一次安装拦腰截断，比重启还狠。
- 界面上：重启胶囊上出现一颗药丸「· 等插件市场装完插件后再重启」，侧栏小圆点的 tooltip 说同一句话（两处读的是同一个字段，不会各说各话）。

### 二、插件目录看门狗：不走市场的安装也看得见（新增）

**问题**：市场探针只知道市场自己报告什么。手工装的插件（终端里 `pnpm add`、或宿主自己的插件管理器）**从不碰市场的 busy 标志**，闸门于是看着「没在装」把那次安装拦腰切断——2026-11-10 丢掉 dsh-mnemon 就是这么来的。

**现在**：第二个信号，与市场无关。插件盯住 profile 目录里**装一次一定碰、日常使用不会碰**的东西：

- `package.json`（加/删依赖）、`pnpm-lock.yaml`（几乎每次安装都会重写它）、`node_modules`（它自己的 mtime 加上条目数）。
- 判据是「**指纹还在动**」：最后一次变动距今不到 `pluginFilesStableMs`（默认 15 秒）就算「还在变」。这不是滑动的「最近有人改过」窗口，所以误报会在最后一次真实变动之后自己消失。
- 一段变动最多挡 `pluginFilesMaxBlockMs`（默认 5 分钟），**卡死的安装不会把宿主永远钉住**。
- 状态**只在内存里**：重启后重新取一次基线。持久化反而会误报——宿主自己启动时也会动 `node_modules`（本地插件是热挂载的），存下来就会变成「新进程拿旧指纹比」的自锁。
- 界面上：重启胶囊上出现一颗药丸「· 等插件装完再重启」。

### 三、关机闸的目标判定：只拦真正在跑的目标（修正）

**原来错在哪**：`goalBusySessions` 读的是 `goal.activated === false` / `goal.active === false`——宿主**从来不设这两个布尔量**，判据恒为 false，于是**暂停的（`paused`）与被缴的（`disarmed`）目标全被当成「在跑」**，关机永远关不成。

**还有一处更硬的**：`apply()` 直接引用了不在它作用域里的 `goalBusySessions`（那个闭包在 `createRuntime()` 内部），每次调用抛 `ReferenceError: goalBusySessions is not defined`，被 `sleepGate` 的 try/catch 吞掉 → 目标列表永远是空的 → **关机闸的目标分支是死代码**。真症状不是「永远拦死」，而是**「拦不住」**：机器会在目标跑到一半时直接关掉。列表现在挂在 runtime 上（`runtime.busyGoals`），`apply` 通过 runtime 取。

**现在怎么判**（`lib/lifecycle.js` 新增两个纯函数 `isGoalRunning` / `selectBusyGoals`，按**真实字段**判）：

| 条件 | 算不算「在跑」 |
|---|---|
| `phase` ∈ {`paused`, `blocked`, `complete`, `completed`, `done`} | 不算 |
| `activation !== 'armed'`（被缴了） | 不算 |
| `roundsStarted >= maxGoalRounds`（轮次用完） | 不算 |
| 其余（武装着、没到终态、还有轮次） | 算，挡住关机 |

探测抛错仍然 **fail-open**（不拦）——判不出来的时候不拿机器开玩笑。

### 四、市场阻塞有了上限：读不到市场不再无限期挡路（修正）

**原来错在哪**：`applyMarketSample` 在探针不可达时**保留**上一次的 busy，而 `marketInstallStatus` 见到 `busy === true` 就返回「正在安装」而且**没有时限**——市场答过一次 busy 之后不再答，重启与关机就被一个**早就结束**的安装永久挡住。这与本模块自己的口径（「看不见的探针不能拿宿主当人质」）正好相反。

**现在**：`marketInstallStatus` 先看 `current.reachable`。最后一次采样不可达时，这个 busy 只是「**记忆**」，只在本轮冷却窗口（`INSTALL_COOLDOWN_MS`，默认 15 秒）内保留，超出即按「没在装」处理（reason `idle`）。窗口从**最后一次市场说 busy 的时刻**算——**沉默不会延长它**。

### 五、设置页的三个新键现在能存下（修正）

**原来错在哪**：`pluginFilesWatch` / `pluginFilesStableMs` / `pluginFilesMaxBlockMs` 三个控件一直画在设置页里、也确实 POST 到 `/choice`，但后端**三处都不认它们**：

- 路由白名单没有它们 → body 里只有它们时落 `400 no-choice`；
- `changes` 组装没有它们 → 就算路由认了也不往下带；
- `persistConfigChoice` 没有它们的分支 → **路由收到了也在这里被丢掉**。

**现在**：三处都补上，并加上与 schema 一致的校验——开关必须是布尔，两个时长必须是**有限且不小于 0** 的毫秒数。非法值回 400，而且**一行都不写**（profile 行零写入）。`normalizeConfig` 也加了钳制：手改过的 profile 行不能把看门狗改坏（非布尔 → true；非有限或负数 → 默认值；否则取整）。

**顺带**：这四个「设一次就不再改」的选项（三个新键 + `restartWindow`）从原来那组里搬出来，进了设置页的**「更多设置」**块（**默认收起**），免得上面那组越来越长。界面这一轮的完整变化见第八节。

### 六、开机时被缴的目标会被收养回来（修正）

**原来错在哪**（三处）：

- `adoptDisarmedGoals` 读 `state.lastRestart.requestedAt` 兜底，而那个字段不在 `TOP_LEVEL_KEYS` 里——**读盘即丢、也从没写过**，是一条永远不可能成立的分支。现在只认 `state.restart.requestedAt`。
- `entry.contextOverflow === true` 改成对象判断（实际存的是 `{ over: true, … }` 对象，旧判据恒为假）。
- 最要紧的是**顺序**：开机流程原来**先算计划、后收养**，而计划只看**已经带着 `pendingResume`** 的会话——`plan.recover === false` 会在收养有机会跑之前就结束开机。一个「唯一待办是被这次重启缴掉的目标」的会话**根本不会被恢复**，只能等谁手敲 `recover_now`。现在收养在前、计划在后（新增 `bootRecoveryPlan`），开机自己就把这种会话恢复起来。

### 七、两处小修

- **链接型插件也看得见**：`readFingerprint` 的指纹原来只有 `package.json` / `pnpm-lock.yaml` / `node_modules` 三项，而用 `link:`（或 junction）装的插件只碰 profile 旁边的 `node_modules-link`，那三个被看路径**全都不变**——看门狗对这类安装**完全失明**。指纹现在把 `node_modules-link` 也算进去。
- **装完一段就清标记**：`sampleFingerprint` 的 `firstChangeAt` 原来**永不清零**（上限放行之后，那条「这一段的起点」在进程余生命里一直有效），于是**上限一旦放行，后面每一次安装都拿那个旧时间戳比、一秒起就超上限**——看门狗从此不再管事。现在这一段结束（静默超过 `stableMs`，或被上限放行）就清零，下一次变动是**全新的一段**。

### 八、设置页重排 + 默认改成后台运行（界面）

这一轮只动界面与默认值，不碰重启/关机的判定。

**一行一件事。** 每一节都改成「**标题在左、控件在右**」，标题不再和控件挤在同一行里当说明；每行原本那一长串解释统一收进**「查看说明」**折叠，不点就只看标题和控件——页面从一堵字墙变成能扫的清单。凡是「开 / 关」的行，控件是**滑动开关**（勾选框仍是真正的控件，键盘和空格照旧能用），不再是勾选框的样子。

**「更多设置」独立成块。** 它原来是「重启相关设置」组最下面的一段，现在是自己的一节，位置在**「关机相关设置」之后、「遇到问题」之前**，**默认收起**。里面四行：重启命令脚本运行方式、插件目录看门狗开关、以及看门狗的两个时长。

**两个时长从输入框改成下拉。** 让人手打毫秒数是个坏主意：

| 行 | 选项 |
|---|---|
| 等待插件没有文件改动多少秒，就算装完（`pluginFilesStableMs`） | 5 / 10 / 15 / 30 / 60 秒 |
| 最多等插件安装多久（`pluginFilesMaxBlockMs`） | 5 / 10 / 30 / 60 分钟 |

一个**不在选项里**的值不会被悄悄改写：它会作为**「当前值」**出现在下拉框里，老配置照旧生效，直到你自己选一个。

**两项标题带上主语，两项成了从属项。** 标题从「安静多久才算装完」这种没主语的写法，改成「等待插件没有文件改动多少秒，就算装完」「最多等插件安装多久」；开关那行是「装插件时先不重启、不关机」。两个时长**缩进画在开关下面**、并画一条淡竖线，一眼看出它们归上面那个开关管；开关关掉时两项**变灰、下拉不可用**，开关那行自己也写着「关掉上面那个开关时，这两项不起作用。」

**「上次重启」那一行撤掉了。** 后台模式是无声的，所以以前专门有一行显示上次真正用的是哪个拉起方式（`wscript`、PowerShell 回落、前台窗口）。它现在不占设置页的地方了——**信息没有消失**：宿主照旧在状态数据和诊断信息里报 `lastLaunch`，只是不在页面上单开一行。

**重启命令脚本的运行方式默认改成后台。** 那行标题也从「辅助脚本的运行方式」改成「**重启命令脚本运行方式**」，选项写清后果：*前台运行（会短暂出现一个窗口）* ／ *后台运行（不出现窗口，也不抢焦点，默认）*。默认值从 `foreground` 变成 `background`（`index.js` 的 schema 与 `DEFAULTS` 都是 `background`，`normalizeConfig` 只把**显式的 `foreground`** 留在前台，缺键或读不懂才回落到后台）——**老配置里已经显式选过前台的仍然保持前台**。重启的其它环节一处没动：宽限等待、空闲闸、杀整棵进程树、清 cookie、拉起、看门狗的先后与错误码语义都不变；这台机器不让运行这类小脚本时，照旧改用隐藏的 PowerShell 并写进重启报告。

### 九、设置页第三轮：备份信息、从属关系、分钟档位（界面）

**「备份说明」有了自己的名字：「备份信息」（`settings.backup.section`）。** 它以前和页面上其它每一行的说明一样也叫「查看说明」——同一个页面上十几处「查看说明」，点开一个是这一行的解释、点开另一个是一整块备份列表，读的人没法从标题知道会展开什么。折叠里的内容一字没动：几份、占多少空间、什么时候会备份、每份带时间与「回退到这一份」按钮、备份路径。它仍然**默认收起**，只有「这次启动是系统回滚过」时自己展开并在标题上写明——回滚是唯一不能藏起来的事。

**「备份包含已安装插件」成了「重启前备份」的从属行。** 它只在上面那个开关开着时才有意义，所以现在画成那个开关的子项：缩进在它下面、跟一道和看门狗两档同样的淡竖线；「重启前备份」关掉时它**变灰、开关不可用**（宿主也不会去读它），它自己也写着「关掉上面那个开关（重启前备份）时，这一项不起作用。」

**「最多等插件安装多久」的档位改成 5 / 10 / 30 / 60 分钟**（`PLUGIN_FILES_MAX_CHOICES` 只剩这四个值，原来那档 1 与 3 分钟删掉——最短就是 5 分钟）。秒那一行仍是 5 / 10 / 15 / 30 / 60 秒。一个**不在档位里**的旧值不会被改写：它以「当前值」出现在下拉框里，照旧生效，直到你自己选一个。

**控件列加宽了。** 行栅格从 `… 220px` 改成 `… 260px`，下拉最小宽 200 px——「后台运行（不出现窗口，也不抢焦点，默认）」这类长选项因此完整显示，不再被旁边的标题挤断成两行。

### 十、关机倒计时默认值 20 → 10 秒（默认值）

**只改默认值**：`DEFAULT_COUNTDOWN_SECONDS`（`lib/sleep.js`）20 → 10，档位 `0 / 10 / 20 / 30 / 60` 与「0 = 立即关机」的语义一个字没动，`/choice` 的取值校验也没变。

**它只决定「从没设置过这一项」的实例拿到什么。** 三处消费点（schema 的 `.default(...)`、`DEFAULTS`、控制器兜底）都只读这一个常量，没有第二处硬编码 20；profile 里已经显式存过 `20` / `30` / `60` 的实例，读到的仍是自己的值——**这里不做迁移、也不覆写**。`snapCountdownChoice` 的四个回落分支（非数字、空串、null/undefined、NaN）跟着从 20 变 10。

**降级环境里选过的秒数以前读不回来（修缺陷）。** `configEditor` 服务不可用时，`persistConfigChoice` 会把选中的秒数写进 `install-choice.json`，`readInstallChoice` 也读得出来——但**没有任何 resolver 把它接进生效值**，于是「选过、写进了文件、重启后又变回默认」。现在照备份三项的写法新增 `resolveCountdownSeconds(rawConfig, stateDir)`：**profile 行 > `install-choice.json` > 内置默认**，返回 `source` 标明来源。两处刻意的不对称：行里的旧值仍按老规则就近取档（`15` → `20`），文件里的值**只认档位**（手可改的 JSON，`"30"` / `NaN` / `15` / `-5` 一律忽略、回落到下一级，不猜也不抛）。设置页浏览器端的兜底常量也同步改成 10，并加了一条「浏览器兜底必须等于 `lib/sleep.js` 的默认值」的测试，防止两处各说各话。

### 十一、备份两组说明重写 + 「保留份数」挪成从属项（界面）

这一轮只动文案与行的位置：备份怎么做、超出怎么删、回退怎么点，判定一处没改。

**「重启前备份」的说明改成说清它实际怎么干活**：每次重启前先比对 DSH 配置和它下面两行覆盖的插件，**有变化才新建一份存档、没变化就沿用最近那份**；**默认保留 2 份**，超出自动删最旧的；份数在下面的**「保留份数」**里改；**关掉这个开关时不做比对，也不产生存档**；存档**不会自动还原**，要回退去**「备份信息」**里点。

**「备份包含已安装插件」的说明分成三类**，因为这三类在代码里本来就是分开处理的：

| 这一类 | 怎么处理 |
|---|---|
| **你自己写的插件**（`lib/backup.js` 里的 `link`：手写在本地目录、以链接方式装） | **连文件一起拷**，回退时能原样还原 |
| 从线上下载后**又本地改过（做过本地化）**的插件（`localized`：其实是 npm 插件，但在这台机器上改过、带 `.git`） | **连文件一起拷**，回退时能原样还原 |
| 其余**原样安装的线上第三方插件**（`thirdParty`） | **只记下名字和版本，不拷文件**；这些由插件作者维护，出问题重装一次即可 |

这不是把三类「说成」分开：`lib/backup.js` 里 `localized` 与 `link` 都会被拷进各自的目录，而 `thirdParty` 在 manifest 里只有 `name` 与 `version` 两个字段。

**「保留份数」从「备份信息」折叠里挪出来了**，现在是**「重启前备份」下的第三行从属项**——与「备份包含已安装插件」同组、同缩进、同一道淡竖线，父开关「重启前备份」关掉时它跟着变灰、不可用。「备份信息」折叠因此**只剩只读内容**：份数与占用空间、每份的时间与「回退到这一份」按钮、备份路径与复制按钮。把份数调小仍会先弹一次确认、问你要删掉几份，这一步没变。

### 文档

- `README.md` 与 `docs/README.zh.md` 补上这一版新增的 8 个配置键（`restartWindow`、`marketStatusUrl`、`marketProbeTimeoutMs`、`marketProbeIntervalMs`、`marketInstallCooldownMs`、`pluginFilesWatch`、`pluginFilesStableMs`、`pluginFilesMaxBlockMs`），写明哪四个在设置页的「更多设置」里（默认收起）、哪四个是纯配置键（设置页没有控件），并新增一节讲「重启前会等什么」。
- 两份 README 里的设置项说明按第八、九节的界面重写：一行一件事、说明收进「查看说明」、开关是滑动开关、从属行（看门狗两档、备份包含插件）缩进且父开关关闭时不可用、两个时长是下拉（档位写全）、备份折叠叫「备份信息」、控件列 260 px、`restartWindow` 默认后台且显式前台的老配置不受影响、「更多设置」独立成块、`上次重启` 一行已从页面移除（信息仍在状态与诊断里）。
- 两份 README 的配置表按第十节更新：`sleepCountdownSeconds` 默认 `10`，并写明「只影响从没设置过这一项的实例，显式存过的值不被迁移或覆写」。
- 两份 README 里原来的跑法 `node --test plugins/dsh-autorestart/test` **是错的**：Node 24 起把 `--test` 的位置参数当 glob，传目录会以 `MODULE_NOT_FOUND` 失败。改成仓库实际提供的 `scripts/run-tests.ps1` 用法。

### 验证

- 全量测试：`tests 1191 / pass 1191 / fail 0 / exit 0`（2026-11-11 本机，随附的 Node，`scripts/run-tests.ps1`）。
- 每一处都补了「**改前红、改后绿**」的用例：把 5 个源文件 stash 掉、只留测试，跑 6 个相关测试文件 → `tests 61 / fail 12`（红）；恢复后同一批全绿。
- 逐条断言：`test/sleep-external-blockers.test.mjs`（真实插件：apply → POST /sleep arm → sleep controller tick → sleepGate → 关机命令桩 → sleepSpawn；paused / disarmed / complete 三个用例 `status.blockers` 为空且 `shutdowns === 1`——机器真的发出了关机命令，armed 用例 `status.phase === 'waiting'` 且 `shutdowns === 0`）、`test/lifecycle.test.mjs`（`isGoalRunning` / `selectBusyGoals` 单元口径）、`test/goal-rearm-after-restart.test.mjs`（旧 checkpoint → 真实开机恢复定时器 → 该会话回到 `pendingResume`）、`test/sleep-choice.test.mjs`（三个键落盘 + 宿主回读新值 + 非法值 400 且零写入 + `normalizeConfig` 钳制）、`test/market-probe.test.mjs`（先 busy 再持续不可达：窗口内仍挡、超窗放行、沉默不延长窗口）、`test/plugin-files.test.mjs`（一段结束清零、下一次安装重新被看见、`node_modules-link` 进入指纹）。

---

This release gives "what a restart waits for" two **plugin-installation** signals (the market is installing, the plugin folder is moving) and fixes the four judgement defects they exposed: the shutdown gate's goal test, the missing upper bound of the market block, the three settings keys that could not be saved, and the goals that were never adopted after a boot. It also carries two small fixes, two rounds of settings-page work (background becomes the default), a shutdown-countdown default of 20 → 10 seconds, and the documentation brought in line.

### 1. Market install probe: a restart and a power-off both wait for the market (new)

**The problem**: while the market (`dshmarket`) installs or upgrades a plugin its pnpm run is still going, followed by retargeting and validation. Restarting the host at that moment leaves a **half-installed plugin** behind. The gate knew nothing about it.

**Now** the gate asks the market one question: "are you installing something?"

- One **read-only** `GET` (this host's own status route, `/dsh-market/status`; `marketStatusUrl` can point elsewhere). No body, no retry, nothing is written.
- `busy` or `active` means "installing"; **an answer that cannot be read always means "nothing is installing"** — a timeout, a 404 (the market is not installed at all), a non-2xx answer, a body that is not an object. The restart proceeds exactly as it did before. **A probe that cannot see must never hold the host hostage.**
- One probe takes at most **800 ms** (`marketProbeTimeoutMs`: it can be shortened, never extended past 800); while waiting, the market is asked every **1500 ms** (`marketProbeIntervalMs`).
- After the market says it finished, the gate still waits **another 15 seconds** (`marketInstallCooldownMs`), to bridge the gap between two operations of its queue.
- **The graceful shutdown uses the same test**: a power-off cuts an installation in half even more surely than a restart does.
- In the interface: the restart capsule shows a pill ("· waiting for the plugin market to finish installing") and the sidebar dot's tooltip says the same sentence — both read the same field, so they cannot contradict each other.

### 2. Plugin-folder watchdog: installs that skip the market are seen too (new)

**The problem**: the market probe only knows what the market itself reports. A plugin installed by hand (a `pnpm add` in a terminal, or the host's own plugin manager) **never touches the market's busy flag**, so the gate saw "nothing is installing" and cut that install in half — that is exactly how dsh-mnemon was lost on 2026-11-10.

**Now** there is a second, market-independent signal. The plugin watches what an install always touches in the profile directory and ordinary use never does:

- `package.json` (adding or removing a dependency), `pnpm-lock.yaml` (almost every install rewrites it), `node_modules` (its own mtime plus the number of entries).
- The test is "**the fingerprint is still moving**": less than `pluginFilesStableMs` (15 seconds by default) since the last change counts as "still changing". This is not a sliding "somebody changed a file recently" window, so a false positive clears itself right after the last real change.
- One episode of changes blocks for at most `pluginFilesMaxBlockMs` (5 minutes by default), so **a stuck installation cannot pin the host for ever**.
- The state lives **in memory only**: a fresh baseline after every restart. Persisting it would produce false positives — the host itself touches `node_modules` while it boots (local plugins are hot-mounted), so a stored fingerprint would mean "the new process compares against the old one" and lock itself.
- In the interface: the restart capsule shows a pill ("· waiting for a plugin install to finish").

### 3. The shutdown gate's goal test: only goals that are really running block (fix)

**What was wrong**: `goalBusySessions` read `goal.activated === false` / `goal.active === false` — the host **never sets either boolean**, so the test was constantly false and **both a paused (`paused`) and a disarmed (`disarmed`) goal counted as "running"**: the machine could never be shut down.

**There was a harder one too**: `apply()` referenced `goalBusySessions` although it is not in its scope (that closure lives inside `createRuntime()`), so every call threw `ReferenceError: goalBusySessions is not defined`, `sleepGate`'s try/catch swallowed it, the goal list stayed empty and **the goal branch of the shutdown gate was dead code**. The real symptom was not "always blocked" but "**never blocked**": the machine was switched off in the middle of a goal. The list now hangs on the runtime (`runtime.busyGoals`) and `apply` reads it from there.

**How it is decided now** (`lib/lifecycle.js` has two new pure functions, `isGoalRunning` / `selectBusyGoals`, which read the **real fields**):

| Condition | Counts as "running" |
|---|---|
| `phase` ∈ {`paused`, `blocked`, `complete`, `completed`, `done`} | no |
| `activation !== 'armed'` (disarmed) | no |
| `roundsStarted >= maxGoalRounds` (round budget spent) | no |
| everything else (armed, not terminal, rounds left) | yes, holds the shutdown |

A probe that throws is still **fail-open** (it does not block) — when the answer cannot be worked out, the machine is not gambled on.

### 4. The market block has an upper bound: an unreadable market no longer blocks for ever (fix)

**What was wrong**: `applyMarketSample` **keeps** the previous busy flag when the probe is unreachable, and `marketInstallStatus` returned "installing" for `busy === true` with **no time limit** — once the market had answered busy and then stopped answering, a restart and a shutdown were blocked by an install that had **ended long ago**. That is the opposite of this module's own rule ("a probe that cannot see must never hold the host hostage").

**Now** `marketInstallStatus` looks at `current.reachable` first. When the last sample was unreachable, that busy flag is only a **memory** and is kept inside this round's cooldown window (`INSTALL_COOLDOWN_MS`, 15 seconds by default); past it the market counts as "not installing" (reason `idle`). The window is measured from **the last moment the market said it was busy** — **silence does not extend it**.

### 5. The three new settings keys are really saved now (fix)

**What was wrong**: the three controls `pluginFilesWatch` / `pluginFilesStableMs` / `pluginFilesMaxBlockMs` were drawn in the settings page and did POST to `/choice`, but the backend **did not know them in three places**:

- the route's whitelist did not list them → a body that carried only them got `400 no-choice`;
- the `changes` assembly did not carry them → even a route that accepted them stopped there;
- `persistConfigChoice` had no branch for them → **the route received the value and dropped it here**.

**Now** all three are in place, with validation that matches the schema: the switch must be a boolean and both durations must be **finite millisecond numbers that are not negative**. An illegal value answers 400 and **not a single line is written** (zero writes to the profile row). `normalizeConfig` clamps as well, so a hand-edited profile row cannot break the watchdog (a non-boolean → true; a non-finite or negative duration → the default; otherwise rounded to an integer).

**Along the way**: those four "set once and forget" options (the three new keys plus `restartWindow`) moved out of the group they were in and into the settings page's **More settings** block (**closed by default**), so the group above it stops growing. The full set of interface changes of that round is in section 8.

### 6. A goal disarmed by a restart is adopted on boot (fix)

**What was wrong** (three places):

- `adoptDisarmedGoals` fell back to `state.lastRestart.requestedAt`, a field that is not in `TOP_LEVEL_KEYS` — **it is dropped the moment the file is read and was never written either**, so that branch could never be true. Only `state.restart.requestedAt` counts now.
- `entry.contextOverflow === true` became an object test (what is really stored is an `{ over: true, … }` object, so the old test was always false).
- The most important one is the **order**: the boot pass used to **compute the plan first and adopt afterwards**, and the plan only looks at sessions that **already carry `pendingResume`** — so `plan.recover === false` ended the boot before the adoption could ever run. A session whose only pending work was a goal this restart disarmed **was never recovered** and waited for someone to type `recover_now`. Adoption now comes first and the plan second (new `bootRecoveryPlan`), so the boot itself recovers that session.

### 7. Two small fixes

- **A linked plugin is seen as well**: the `readFingerprint` fingerprint had only `package.json` / `pnpm-lock.yaml` / `node_modules`, while a plugin installed with `link:` (or a junction) only touches `node_modules-link` next to the profile — so all three watched paths stayed **exactly the same** and the watchdog was **completely blind** to that kind of install. The fingerprint includes `node_modules-link` now.
- **The marker is cleared when an episode ends**: `sampleFingerprint` never cleared `firstChangeAt` (once the cap had released an episode, the "start of this episode" stayed valid for the rest of the process), so **after the cap released once, every later install was compared against that old timestamp and was over the cap from the first second** — the watchdog stopped working for good. Now the marker is cleared when the episode ends (the files have been quiet for longer than `stableMs`, or the cap released it), and the next change is a **fresh episode**.

### 8. Settings page rework + background running becomes the default (interface)

This round only touches the interface and defaults; it does not change how a restart or a shutdown is decided.

**One row per thing.** Every section is now "**title on the left, control on the right**"; the title no longer shares a line with the control to serve as its explanation, and the long explanation each row used to carry moved into a **Show details** fold — without opening it you see only the title and the control, which turns the page from a wall of text into a list you can scan. Every "on / off" row is a **sliding switch** (the checkbox is still the real control, so the keyboard and the space bar keep working), no longer styled like a checkbox.

**More settings is a block of its own.** It used to be the bottom part of the Restart settings group; it is its own section now, placed **after Shutdown settings and before Something is wrong**, **closed by default**. It holds four rows: how the restart command script runs, the plugin-folder watchdog switch, and the watchdog's two durations.

**The two durations turned from input fields into dropdowns.** Asking people to type milliseconds by hand is a bad idea:

| Row | Choices |
|---|---|
| How many seconds without a file change mean the plugin is installed (`pluginFilesStableMs`) | 5 / 10 / 15 / 30 / 60 seconds |
| How long to wait at most for the plugin install (`pluginFilesMaxBlockMs`) | 5 / 10 / 30 / 60 minutes |

A value that is **not one of the choices** is never rewritten behind your back: it appears in the dropdown as **Current value**, and the existing configuration keeps working until you pick one yourself.

**Two titles name their subject, and two rows became subordinates.** The titles changed from a subject-less "quiet for how long counts as done" to "How many seconds without a file change mean the plugin is installed" and "How long to wait at most for the plugin install"; the switch row reads "Do not restart or shut down while plugins are installing". The two durations are **drawn indented under the switch** behind a faint vertical line, so it is obvious at a glance that they belong to the switch above; while the switch is off both **go grey and their dropdowns cannot be used**, and the switch row says so itself: "When the switch above is off, these two do nothing."

**The "last restart" row is gone.** Background mode is silent, so there used to be a row showing which launcher really ran (`wscript`, the PowerShell fallback, the foreground window). It no longer takes up room on the settings page — **the information did not disappear**: the host still reports `lastLaunch` in the state data and in the diagnostics, it simply no longer has a row of its own.

**How the restart command script runs now defaults to background.** That row's title also changed, from "how the helper script runs" to "**How the restart command script runs**", and the choices spell out the consequences: *Foreground (a window appears briefly)* / *Background (no window at all, and it never takes the focus; the default)*. The default went from `foreground` to `background` (both the schema in `index.js` and `DEFAULTS` say `background`, and `normalizeConfig` keeps only an **explicit `foreground`** in the foreground; a missing or unreadable value falls back to background) — **an existing configuration that explicitly chose the foreground stays in the foreground**. Nothing else about the restart changed: the grace wait, the idle gate, killing the whole process tree, clearing the cookies, the relaunch and the watchdog keep the same order and the same error-code semantics; when this machine does not allow such little scripts to run, the hidden PowerShell is used as before and the reason is written into the restart report.

### 9. Third settings round: Backup info, subordinate rows, minute tiers (interface)

**"Backup explanation" has a name of its own: "Backup info" (`settings.backup.section`).** It used to be called "Show details" like the explanation of every other row — a dozen "Show details" on one page, one of them opening this row's explanation and another opening a whole backup list, so a reader could not tell from the title what would unfold. The contents did not change by a single character: how many copies, how much space they take, when a copy is taken, each with its time and a "roll back to this one" button, and the backup path. It is still **closed by default** and opens itself only when "this boot was restored by the system", saying so in its title — a restore is the one thing that must not be hidden.

**"Include the installed plugins in the backup" became a subordinate row of "Back up before a restart".** It only means something while that switch above is on, so it is drawn as that switch's child: indented under it, behind the same faint vertical line as the watchdog's two durations; while "Back up before a restart" is off it **goes grey and its switch cannot be used** (the host does not read it either), and it says so itself: "When the switch above (back up before a restart) is off, this one does nothing."

**The tiers of "How long to wait at most for the plugin install" became 5 / 10 / 30 / 60 minutes** (`PLUGIN_FILES_MAX_CHOICES` holds only these four values; the old 1- and 3-minute tiers are gone — the shortest wait is 5 minutes). The seconds row is still 5 / 10 / 15 / 30 / 60 seconds. An old value that is **not one of the tiers** is never rewritten: it shows up in the dropdown as "Current value" and keeps working until you pick one yourself.

**The control column is wider.** The row grid went from `… 220px` to `… 260px`, and a dropdown is at least 200 px wide — so a long choice such as "Background (no window at all, and it never takes the focus; the default)" is shown in full instead of being squeezed into two lines by the title next to it.

### 10. Shutdown countdown default 20 → 10 seconds (default)

**Only the default changed**: `DEFAULT_COUNTDOWN_SECONDS` (`lib/sleep.js`) 20 → 10. The tiers `0 / 10 / 20 / 30 / 60` and the meaning of "0 = shut down immediately" did not change by a single character, and neither did the value check of `/choice`.

**It only decides what an instance that never set this option gets.** All three consumers (the schema's `.default(...)`, `DEFAULTS`, and the controller's fallback) read this one constant; there is no second hardcoded 20; an instance whose profile already stores `20` / `30` / `60` still reads its own value — **nothing is migrated and nothing is overwritten**. The four fallback branches of `snapCountdownChoice` (not a number, empty string, null/undefined, NaN) follow from 20 to 10.

**A countdown chosen in a degraded environment could not be read back (defect fixed).** When the `configEditor` service is unavailable, `persistConfigChoice` writes the chosen seconds into `install-choice.json` and `readInstallChoice` can read it — but **no resolver fed it into the effective value**, so "you chose it, it was written to the file, and after a restart you were back to the default". Following the pattern of the three backup keys there is now `resolveCountdownSeconds(rawConfig, stateDir)`: **profile row > `install-choice.json` > built-in default**, with a `source` telling which one applied. Two deliberate asymmetries: an old value in the row is still snapped to the nearest tier by the old rule (`15` → `20`), while a value in the file **must be a tier** (it is hand-editable JSON: `"30"` / `NaN` / `15` / `-5` are all ignored and fall through to the next level — nothing is guessed and nothing is thrown). The browser-side fallback constant of the settings page moved to 10 as well, and a test now pins that "the browser fallback must equal the default in `lib/sleep.js`", so the two cannot drift apart.

### 11. The two backup explanations rewritten, and "Copies kept" becomes a subordinate row (interface)

This round only moves wording and the position of a row: how a copy is made, how the oldest is deleted and how you roll back did not change anywhere.

**The "Back up before a restart" explanation now says what it really does**: before every restart it compares your DSH settings and the plugins covered by the two rows below it — a new copy is written **only when something changed**, and when nothing changed the most recent copy is reused; **two copies are kept by default** and the oldest is deleted when there are more; that number is changed under **Copies kept** below; **with the switch off nothing is compared and no copy is taken**; a copy is **never restored by itself** — to roll back, press the button in **Backup info**.

**The "Include the installed plugins in the backup" explanation splits the plugins into three kinds**, because the code already treats them separately:

| Kind | What happens |
|---|---|
| **the plugins you wrote yourself** (`link` in `lib/backup.js`: written by hand in a local directory and installed as a link) | **copied with their files**, so a rollback restores them exactly |
| the ones you **downloaded and then changed on this machine** (`localized`: really an npm plugin, but edited here and carrying a `.git`) | **copied with their files**, so a rollback restores them exactly |
| the rest of the **online third-party plugins, installed as they came** (`thirdParty`) | **only their name and version are recorded, no files are copied**; their authors keep them up to date, so if something breaks, install them once more |

That is not the wording inventing a split: in `lib/backup.js` both `localized` and `link` are copied into their own directories, while a `thirdParty` entry carries only `name` and `version` in the manifest.

**"Copies kept" moved out of the "Backup info" fold** and is now the **third subordinate row of "Back up before a restart"** — same group, same indentation and the same faint vertical line as "Include the installed plugins in the backup", and it goes grey and unusable when the parent switch is off. The **Backup info** fold therefore holds **read-only content only**: how many copies there are and what they take on disk, each copy's time with a "roll back to this one" button, and the path with its copy button. Shrinking the number still asks first how many copies will go — that step did not change.

### Documentation

- `README.md` and `docs/README.zh.md` gained the 8 configuration keys this release adds (`restartWindow`, `marketStatusUrl`, `marketProbeTimeoutMs`, `marketProbeIntervalMs`, `marketInstallCooldownMs`, `pluginFilesWatch`, `pluginFilesStableMs`, `pluginFilesMaxBlockMs`), say which four live in the settings page's More settings (closed by default) and which four are pure configuration keys (no control in the settings page), and gained a section about "what the restart waits for".
- The settings descriptions in both READMEs were rewritten for the interface of sections 8 and 9: one row per thing, explanations folded behind Show details, switches are sliding switches, subordinate rows (the watchdog's two durations, include-plugins-in-the-backup) are indented and unusable while the parent switch is off, both durations are dropdowns (with every tier listed), the backup fold is called "Backup info", the control column is 260 px, `restartWindow` defaults to background while an explicit foreground is unaffected, More settings is a block of its own, and the "last restart" row is gone from the page (the information is still in the state and the diagnostics).
- The configuration tables in both READMEs were updated for section 10: `sleepCountdownSeconds` defaults to `10`, with the sentence "it only affects an instance that never set this option; an explicitly stored value is neither migrated nor overwritten".
- The way to run the suite that both READMEs gave, `node --test plugins/dsh-autorestart/test`, **was wrong**: since Node 24 the positional arguments of `--test` are glob patterns, so passing a directory fails with `MODULE_NOT_FOUND`. It now points at the `scripts/run-tests.ps1` the repository actually ships.

### Verification

- Full suite: `tests 1191 / pass 1191 / fail 0 / exit 0` (2026-11-11 on this machine, the bundled Node, `scripts/run-tests.ps1`).
- Every fix came with a "**red before, green after**" case: stashing the 5 source files and running the 6 related test files gave `tests 61 / fail 12` (red); the same batch was green again after restoring them.
- Case by case: `test/sleep-external-blockers.test.mjs` (the real plugin: apply → POST /sleep arm → sleep controller tick → sleepGate → shutdown-command stub → sleepSpawn; the paused / disarmed / complete cases assert an empty `status.blockers` and `shutdowns === 1` — the machine really issued the shutdown command — while the armed case asserts `status.phase === 'waiting'` and `shutdowns === 0`), `test/lifecycle.test.mjs` (the unit level of `isGoalRunning` / `selectBusyGoals`), `test/goal-rearm-after-restart.test.mjs` (an old checkpoint → the real boot-recovery timer → that session comes back with `pendingResume`), `test/sleep-choice.test.mjs` (the three keys are saved + the host reports the new values back + an illegal value answers 400 with zero writes + the `normalizeConfig` clamp), `test/market-probe.test.mjs` (busy first and then continuously unreachable: blocked inside the window, released past it, and silence does not extend the window), `test/plugin-files.test.mjs` (an episode clears its marker when it ends, the next install is seen again, `node_modules-link` is part of the fingerprint).

## 0.9.5

这一版除了两处边角修复，还给重启加了一个可选的低打扰模式：
两个工具脚本的 **state-dir 覆写加了一道 DRILL 闸**；文档里**引用的安检脚本路径**改成真实存在的那一份；
设置页新增 **`restartWindow`**（重启辅助脚本可后台无窗口运行，默认仍是原来的前台）；并补上了
**每次启动清理过期助手文件**——真机实测状态目录里堆了 **351 个** `restart-<gen>.cmd`。

### 一、两个脚本的 state-dir 覆写加 DRILL 闸

`scripts/clear-dsh-auth-cookies.mjs` 与 `scripts/cleanup-shell-backups.mjs` 的 `stateDirOf()` 此前只要读到
`DSH_AUTORESTART_STATE_DIR` 就跟着走。问题不在于「读环境变量」，而在于**这两个变量能被同用户的任意进程设置**，
而 `cleanup-shell-backups.mjs` 的职责就是**删目录**（清 `backups/` 下的旧备份与空壳）——不设闸，等于「谁设了变量，
就能让它去删谁指的那棵树」。

现在两个脚本共用同一条判据：

- 只有 `DSH_AUTORESTART_DRILL` 的 `trim()` 后值**正好等于 `1`** 时，才认 `DSH_AUTORESTART_STATE_DIR`；
- 其余一切情况（未设、`0`、`true`、`yes`、空串、纯空白）一律回落到插件自己的状态目录
  `~/.dsh/storages/dsh-autorestart`；
- 即使 DRILL 已开，`DSH_AUTORESTART_STATE_DIR` 为空（或只有空白）仍然回落默认，不把空路径当合法目标。

四种环境组合的实测结果：

| 环境 | `stateDirOf()` 的结果 |
| --- | --- |
| 只设 `DSH_AUTORESTART_STATE_DIR` | 回落插件默认状态目录（覆写不生效） |
| `DSH_AUTORESTART_DRILL=1` + `DSH_AUTORESTART_STATE_DIR` | 覆写生效，落在指定目录 |
| `DSH_AUTORESTART_DRILL=true` + `DSH_AUTORESTART_STATE_DIR` | 回落默认（只认 `1`） |
| `DSH_AUTORESTART_DRILL=1` + 空的 `DSH_AUTORESTART_STATE_DIR` | 回落默认（空路径不算覆写） |

### 二、文档里失效的安检脚本路径已修正

工作区 `docs/` 下 6 份文档共 **12 处**仍指着 `plugins/dsh-codekg/security_scan.mjs`——该位置已经不存在，
照旧路径抄的人/单子会直接 `ENV_ERROR`。已全部改为真实存在的 `plugins/dsh-security-scan/security_scan.mjs`：

- `dsh-autorestart-security-handoff.md`（6 处）
- `security-negative-cases.md`（2 处）
- `handoff-goal-guard.md`、`security-scan-handoff.md`、`security-scan-rule-fix-handoff.md`、`spawn-sink-check-handoff.md`（各 1 处）

其中 `handoff-goal-guard.md` 那处是「**旧**：…（已不存在）／**新**：…」的迁移对照，属于历史事实：
只把「新」那一行指向真实路径，旧路径原样保留——不机械替换，免得把「当初错在哪」一起抹掉。

### 三、`restartWindow`：重启辅助脚本可后台无窗口运行（设置页「重启相关设置」组最下面）

重启时那个 `.cmd` 辅助脚本是个控制台程序：它被 WMI / `schtasks` / `cmd.exe /c` 拉起，`ping -n N` 的等待让窗口
停留好几秒。现在「重启相关设置」组的最下面（备份说明与手动备份操作之后）多了一个下拉，默认是原来的行为：
**前台运行**（默认，行为与以前完全一样）／**后台运行**（不出现窗口，也不抢焦点），改完在下次重启生效。

后台模式选的不是「把 `.cmd` 包进 `powershell -WindowStyle Hidden`」，而是**方案 B：wscript + VBS 垫片**——
写一个 `restart-<gen>-window.vbs`，用 `wscript.exe //B <垫片>` 拉起，垫片里
`CreateObject("WScript.Shell").Run "<命令行>", 0, False`：

- `0` = 隐藏窗口，`False` = 不等待。`wscript.exe` 是 GUI 子系统进程，**连控制台都不分配**，
  所以不存在「闪一下」；`Run` 也不激活任何窗口，**全屏游戏不会被切走**——用户提的就是这两条。
- 垫片跑完**立即自删**；万一删不掉（文件被短暂占用）或留下别的助手文件，启动时的清理会兜底（见下一节）。
- 机器的安全策略禁用 Windows Script Host 时允许回落：垫片写失败、或 `wscript` 经 WMI + `schtasks` 都拉不起来，
  就改用 `powershell -NoProfile -NonInteractive -WindowStyle Hidden -EncodedCommand …`（内部 `CreateNoWindow=$true`）
  跑**同一条命令行**；`launcher` 与 `fallbackReason` 写进重启报告，设置页「上次重启」一行会显示用了哪条、为什么回落。

`foreground` 仍然**逐字节等于**改动前的拉起命令（有测试用字面量固定）：两种模式只在「怎么被拉起来」上不同，
`宽限等待 → 空闲门 → taskkill 整棵树 → 等 3 拍 → 清 cookie → 拉起 → 起看门狗` 的顺序与错误码语义一字未动。

### 五、重启浮窗在「正在备份」阶段漏报插件范围

用户开了「备份包含已装插件」，浮窗却只说「**配置**有变化，正在备份」，没提插件——而他当初要的就是「配置和插件」。
这条修了两次都没见效，**真正的原因是阶段记录的白名单**：

- 客户端决定文案时看的是阶段记录里的「这次备份含不含插件」；而这个字段原先**写在记录旁边**，不是记录的一部分。
- `lib/checkpoint.js` 的 `setRestartPhase` 用白名单重建阶段记录，`setRestartProgress` 每拍进度又整条替换一次，
  磁盘恢复时的 `normalizeRestartPhase` 也是重建——**写进去的字段当场就被丢掉**。
- 字段一丢，客户端只能退回字符串后缀判断（`reason` 里的 `+plugins`），而那个后缀本来就只有比对阶段写过，
  本机又走链接安装，于是稳定降级成「只有配置」。

修复分两层：

1. **字段进 checkpoint 层**：`setRestartPhase` 接受并写入 `includePlugins`（`boolean` 或 `null`），
   同一轮重启内阶段切换时**原样带过**；`setRestartProgress` 每拍重建时**原样带过**；
   `normalizeRestartPhase` 从磁盘读回时**保留**它，非法值归一为 `null`、旧状态文件缺这个键也是 `null`（不报错、不算损坏）。
2. **客户端优先读显式字段**，只有字段确实不存在（更老的宿主）才回退到 `+plugins` 后缀；
   「正在备份」「没有变化，跳过备份」「无法比对」三句都按真实范围选文案。

测试补了链路级用例：阶段写入 → `state.restartPhase` → `restartStageInfo()` → 一次进度刷新之后，
字段都还在；带 `includePlugins` 的状态写成 JSON 再读回来，字段仍在；旧状态文件缺这个键读成 `null`。
一条把这个缺陷写成预期的断言改成「含插件必须出现插件字样」，另加「显式 `false` 才用配置文案」的用例。

同时删掉了一条**永远不可能显示的死链路**：`'comparing'` 从来不在 `RESTART_PHASES` 里（只有
`waiting / snapshotting / restarting / back`），所以 `markRestartStage('comparing', …)` 一直被
`setRestartPhase` 拒绝，前端那张「正在比对配置和插件有没有变化…」的卡片永远出不来。
现在整条已删除——宿主的调用点、`restartBackupCard` 的 `comparing` 字段、覆盖层里对应分支、
`RESTART_OVERLAY_KEYS` 里的键、中英两份文案以及只验证这条死分支的断言。
决策追踪里的 `noteBranch('comparing', …)` 保留：它只是日志标签，不参与阶段状态机。

### 六、后台模式不再闪一个控制台小窗

用户开了「后台运行」，DSH 窗口关掉之后仍会有一个小窗一闪而过。原因在**拉起宿主那一步**：
辅助 `.cmd` 里写的是 `start "" powershell.exe -WindowStyle Hidden -NoProfile -Command Start-Process …`——
`-WindowStyle Hidden` 是 **powershell 先创建控制台、再把它隐藏**，所以那一下必然可见。
拉起看门狗（回滚脚本）的那一行也是同样的形状，于是会闪两次。

后台模式现在把这两步都交还给 VBS 垫片，用参数区分三种角色（同一个文件，不新增临时文件）：

- 无参数：把辅助 `.cmd` 隐藏着跑起来（这条不变）；
- `launch`：用 `Shell.Application.ShellExecute(exe, "", "", "open", 1)` 直接拉起宿主。
  `wscript.exe` 是 GUI 子系统进程，**连控制台都不分配**，因此没有任何窗口可闪；
- `watch`：用 `shell.Run …, 0, False` 隐藏着启动回滚看门狗，同样不再创建控制台。

**回落是真实可执行的、并且写进报告**：`ShellExecute` 被安全策略拒绝时，垫片立刻退回原来的
`powershell -WindowStyle Hidden -NoProfile -Command Start-Process -FilePath '<exe>'`（去掉 `start ""`，
垫片里没有 cmd 内建命令），那条会闪一下——所以重启报告里多两个字段：
`relaunch` 取 `shell-execute`（无控制台）或 `powershell-hidden`（会闪、并且说明为什么），
`relaunchFallback` 写明垫片回落时用的是什么。`launcher` 仍是 `wscript` / `powershell-hidden` / `foreground`
（设置页「上次重启」读的就是它，取值不变）。

前台模式**逐字节不变**（既有字面量测试仍过）：它照旧用 `start "" powershell.exe -WindowStyle Hidden …`。
垫片也不再在第一次运行时自删了——`launch` 步几秒后还要重新进入同一个文件；`launch`/`watch` 结束时自删，
被空闲门取消的那次留下的文件由启动清理兜底（报告里的 `shimLeftBehind` 会点名）。

### 已知限制：没有「重启后窗口最小化」选项

本打算再加一个「重启后新窗口最小化出现」的选项，**真机实测无效，已整条移除**，不把无效开关发出去：

- 命令确实带上了 `-WindowStyle Minimized`（`.cmd` 原文可证），但 DSH 是 Electron 应用，**窗口怎么显示由它自己决定**，
  实测仍然正常弹出，没有被最小化；
- 官方 CLI 也没有可用的窗口参数：launcher 只有 `-V / --patch / --dump-config / --dump-default-config / --help`，
  web 只有 `--host / --port / --trusted-host`，**没有任何「最小化 / 隐藏启动」的开关**。

所以本版只提供经过验证有效的 `restartWindow`（辅助脚本后台无窗口），**不提供**「重启后窗口最小化」。
若以后宿主补上窗口参数，再单独加回来。

### 四、启动清理补上 `restart-<数字>.cmd`（真机 351 个残留）

每次走空闲门的重启都会写一份 `restart-<数字>.cmd`，**从来没有谁删它**。真机实测：状态目录里躺着
**351 个**（373 KB，从 10-22 攒到 11-09），这正是发版前「残留文件数 = 0」一直过不去的原因。

启动清理（`sweepRestartHelpers`，旧名 `sweepWindowShims` 保留为同一套行为的别名）现在同时覆盖两类：

- `restart-<数字>.cmd`（新的）与 `restart-<数字>-window.vbs`（已有的）；两者都要**文件名严格匹配 + 内容像我们的**；
- **60 秒内刚写的文件一律不动**（调度器可能正把它交给 `cmd.exe`，垫片的 wscript 也可能还在读）；
- 清理的数量（`.cmd` / `.vbs` 分别计数）与失败原因写进重启报告与插件状态，**不抛错、不阻断启动**。

### 验证

- 加闸后全量测试 `tests 1080 / pass 1080 / fail 0`；
- `restartWindow` 与助手清理加入后全量测试 `tests 1088 / pass 1088 / fail 0`；
- 移除「重启后窗口最小化」后全量测试 `tests 1089 / pass 1089 / fail 0`；
- 两个脚本的 `stateDirOf()` 在四种环境组合下逐条实测，结果见上表；
- 助手清理的用例覆盖：匹配文件被删、名字像但内容不是我们的保留、60 秒内的新文件保留、计数正确
  （`removedCmd` / `removedVbs` / `scanned`）、旧别名仍同时清两类。

## 0.9.4

这一版把「重启前备份」从「每次都拷一份」改成「**真变了才拷**」：判据从**文件时间**换成**文件内容（sha256）**，
并加了一层免费的快速排除。同时修掉了只有真机才会暴露的几个坑：回退无法恢复 link 型插件、单插件失败被整体吞掉、
判 changed 时说不出理由。版本号仍是 0.9.4。

### 一、内容没变就不备份（真机读数在前）

真机现象：两份备份逐文件对比 **新增 0 / 消失 0 / 大小变 0**，判定却是 `changed`，于是又白拷了一份
**309,194,944 字节**（gen 528）。原因不是判断逻辑写错，而是判据里混进了**文件时间**——同样的字节被重写一次，
时间就变，判据就翻脸。

修复：备份写入时把每个文件的 sha256 记进清单（`fileHashes`，包含三个配置文件），比对时用**内容哈希**决定
`unchanged` / `changed`。对照证据（真机）：活文件 sha1 `58226AE5` @ 17:18:05 vs 副本 sha1 `58226AE5` @ 17:01:46
—— **内容相同，时间相差 16 分钟**，旧版本判 `changed`，新版本判 `unchanged`。

修复后连续三代读数：gen 531 / 532 / 533 全部 `skipped=unchanged`、`compareReason=content-equal-mtime-differs`，
备份数保持 2，不再膨胀。

判 `changed` 时不再是「沉默的 null」，而是给出可读理由：
`config-differs`（配置半段）／`plugin-tree-differs`（插件树，附 ≤5 条 `path + kind`）／`no same-scope copy`（没有同范围基准）／
`hash-budget-exceeded`（预算用尽，保守判有变化并写明）／`content-unreadable`（读不到，不能当作相等）。

### 二、快速排除层：三样全等就零内容读

内容哈希可靠，但每次重启读全量约 300 MB。因此在内容裁决**之前**加一层元数据比较（borg files cache / rsync
quick check 的做法）：清单里记录每个活文件的 `{size, mtimeMs, ino}`，**三者全等即判该文件未变、不读一个字节**。

- 全等 → `compareReason=metadata-equal`（真机 gen 536 实测：零内容读，备份数保持 2）；
- 任一项不等 → 回落内容裁决，所以「**只 touch 不改内容**」仍然是 `unchanged`；
- 三元组里的时间用**原始毫秒**，不取整到秒：秒级粗化会放过「同一秒内原地重写」这种真实改动。

**冷启动回填**：升级用户的旧副本只有 `fileHashes`、没有 `fileStats`（真机 gen 534：`fileHashes=861 / fileStats=0`），
而内容不变就永远不写新副本——这类副本会永久停在慢路径。现在只要本轮判 `unchanged`，就把当前活文件的三元组
回填进**该副本自己的 manifest**：只增加 `fileStats` 一个字段，其余字段原样保留；回填失败（只读、被占用）不致命，
结论不受影响，原因记在 `backfillReason`。

### 三、浮窗两张卡

重启浮层拆成两张：进行中的进度卡 + 结束后的结果卡（成功/跳过/失败各自一句话），跳过时明确说「没变化，直接用上一份」，
并显示用了哪一份副本。

### 四、设置页说明

设置页把「什么时候会备份、什么时候会跳过、跳过意味着什么」写成一句人话，跳过的判定依据（`compareReason`）也一并展示，
不再需要翻日志才知道为什么没备份。

### 五、回退能恢复 link 型插件（真机实验）

此前回退只处理配置文件与普通插件目录，`link:` 安装的插件（`node_modules-link/`）被漏掉，等于「回退成功但插件没回去」。

修复后真机实验（gen 519 前后）：先加探针注释 → 备份 B4（含探针，14,117 字节 / `FE95702E`）→ 删探针 →
`rollback-to B4`，结果：**6 个插件的 index.js 被写回**（mtime 16:49:05–16:49:07）、探针回来、用户自己的
`only-live2.md` 保留、`.git` 下 55 个文件完好、链接仍是 `SymbolicLink`。

### 六、单插件失败可见 + 重启后自动补做（deferred）

回退时若某个插件正被占用（最典型的就是**本插件自己的文件**），以前整次回退会被判失败或静默跳过。现在：

- 该插件单独失败 → 进 `deferred`，回执与健康状态里**看得见**（哪个插件、什么错、来自哪份备份）；
- 下一次启动自动补做（`resumeDeferredRestore`），补做成功即清除记录。

### 七、已知限制（必须知道）

1. **运行中的插件（尤其本插件自身）在回退时仍可能被占用**：此时它进 `deferred`，回执可见，重启后自动补做
   —— 也就是说「回退立刻完全生效」对这类插件不成立，需要一次重启。
2. **`prune` 不保护被 `deferred` 引用的备份**：如果补做还没发生而保留策略先跑，那份备份可能被清掉，补做就无从做起
   （已记欠账，尚未修）。
3. **首次安装的种子判定仍可能误触发**：极端情况下仍会种下一份其实不必要的副本（已记欠账，尚未修）。

### 验证

- 全量测试 1071 / 1071 通过；
- 真机读数见上（gen 528 → gen 531/532/533 → gen 536；回退实验读数）。
## 0.9.3

这一版把用户在真机上反馈的几件事一起收了：**重启前备份有时候根本没做**、**备份目录里堆着空壳把份数预算撑爆**、**拷贝进度永远停在 0%**、**一次性残留卡片要刷新才出现、点「清理掉」还没反应**。改动落在 `d85af1e`（修复批），版本号在 `8fe39b8` 单独 bump。

### 修正：重启前备份保不住 / 空壳把保留份数撑爆 / 进度永远停在 0%（2026-11-07）

1. **最新一份不再被 first-install 种子抢占。** 种子（第一次安装时留下的那份）不再参与「最新」的候选，
   只取最新的、非种子的完整备份——否则保护位会被一份老种子占住，真正的滚动备份被当成「多出来的」删掉。

2. **删除失败不再静默。** 删除前先清只读属性、删完再校验目录确实不存在；失败逐条进 `failures`
   （不再是一个静默的 `catch {}`），回执里能说清「哪一份没删掉、为什么」。

3. **保留份数只统计带 manifest 的完整备份。** 空壳（没有清单的残留目录）单独计数、单独处理，
   不再占用保留份数的预算——份数从此是「真正可回滚的备份」的份数。

4. **`node_modules-link/<name>` 的拷贝补上了 `onProgress`，进度分母改成这次真正要拷的量。**
   原先只统计 3 个配置文件，于是目标很大、进度条却永远停在 0%——那次真机上进度采样 46 条
   从 0 走到 100%，末条 bytes 与 total 完全相等。

### 修正：一次性残留「要刷新才出现」「点了清理掉没反应」（2026-11-07）

1. **就自己出来。** 一次性残留卡片挂在 composer 上方，挂载即查 + 每 5 秒轮询，切到后台暂停，
   答过即停——用户不用再刷新页面才看到它。

2. **点下去当场有反馈。** 点击的那一帧就把按钮置灰并显示「正在清理，请稍候」/「正在记下来，请稍候」，
   不 await 任何往返；失败时显示一句可读的错误（走 locale，中英各一套），渲染或轮询抛错也不再静默。

3. **说完就收。** 成功回执 3 秒后自动消失，错误文案留 10 秒（要读完），两者消失后都不再发任何请求；
   清理进行中不计时、不提前消失。

4. **修掉 t10 遗留的作用域缺陷。** 卡片的 helper 与 React 工厂原本在两个互不可见的 IIFE 里，
   于是在真机上点「清理掉」取回执时抛 `ReferenceError`——**这就是「点了没反应」的根因**，
   而不只是少了一句文案。

### 修正：profile 目录定位把备份「静默跳过」（2026-11-07，那次真机事故的根因）

1. **先问，再记，最后才扫。** 顺序是 `DSH_PROFILE_DIR` → `DSH_HOME`+`DSH_PROFILE` → `--profile`
   → 扫描；能问到时**一次都不读 `profiles/` 目录**。解析成功一次就把路径记进 `state/profile-dir.json`，
   下次启动先读它（目录还在就直接用，被删才重新解析）。

2. **扫描排除了残留与拷贝。** `_backup-*`、`*.broken-*`、`*.partial-*`、以 `_` 开头的目录一律不参与；
   扫描只在问不到时兜底，且**候选唯一才采用**，多于一概判 `ambiguous`，不许猜。
   那次事故里另一个会话把整个 profile 复制成 `profiles/_backup-before-fetch-fallback-…`（也声明本插件），
   扫描到两个候选 → `ambiguous` → 备份没做。

3. **跳过备份不再只是日志里的一句 warn。** 重启结果与设置页都会显示
   「这次没有备份：没找到你的配置目录（发现 N 个候选）」——`N` 是扫描真实看到的候选数。

### 其它

- **先把话答回去，再去删。** `POST` 立刻返回「已受理」，后台每批 8 个目录分批删除，回执随下一次 `GET` 取回。
- **旧宿主不再无限「清理中」**：应答里没有 `cleanup` 字段时，直接用应答自带的 `removed`/`failures` 出回执；
  轮询另有 60 秒上限，到点给一句明确的文案。
- `scripts/cleanup-shell-backups.mjs` 只支持 `--dry-run` 报数，拒绝路径参数（免得被当成删除工具）。
- `lib/legacy-cleanup.js`：`execFileSync` 的程序名改成常量映射，消掉既有的 dynamic-program blocker。

### 读数

- 测试：`node --test plugins/dsh-autorestart/test/` → **1040 项全绿**（pass 1040 / fail 0）。
- 安检：`plugins/dsh-security-scan/security_scan.mjs` → **0 blocker**（medium 2 / info 6）。
- 真机：重启前备份 **taken=true**，**274.5 MB** 完整备份（配置 + 7 个插件 + 清单）；进度采样 46 条 0→100%，
  末条 bytes 与 total 完全相等。

## 0.9.2

### 修正：「这次启动少东西了」浮窗的三处自相矛盾（2026-11-05）

用户在真机上看到的卡面是：标题「有两件事要你看一下」→「这些功能这次没起来」→
`@deepseek-ai/dsh-experimental-client-ui-forge`→「这个插件是第三方安装的，备份里没有它的文件。
**要还原就用下面那条命令**，它会装回原来的那个版本（不是最新版）：」→**（空行，下面没有命令）**→
「备份里查不到它的精确版本，只能按插件名重新安装。」

1. **没有命令就不承诺命令。** 「要还原就用下面那条命令」这句话和它下面那条命令现在在**同一个分支**里：
   真的构造出了命令（`dsh plugin --profile <p> add <name>@<version>`）才输出这句话 + 命令；
   没有命令时只说一句实话（新增词条 `pluginFailure.noCommandHint`），旧的 `pluginFailure.noVersion`
   文案（本身就是一句「只能按插件名重新安装」的自相矛盾）连同词条一起删掉。

2. **插件清单里查不到的包不再算「没起来的插件」。** 清单是本 profile 插件的名单；名单里没有的包
   （例如宿主自带的 `@deepseek-ai/dsh-experimental-client-ui-forge`）不是用户装的插件，
   备份里没有它的文件、也没有可重装的版本——列出来等于让用户去做一件做不到的事。
   现在 `buildPluginFailureModel` 直接跳过这类包。**前提**：只有清单真的读到了（rows 非空）才启用这条过滤；
   清单读不到时保持原样，不把整张卡静音。

3. **标题不再声称件数。** 「有两件事要你看一下」/「Two things worth a look」换成中性说法
   （中文「启动后有东西没起来」，英文「Something did not come up after the start」）——
   这张卡只有一份列表，列表里可能有一个名字，也可能有几个。

### 修正：浮窗里的还原命令写着 `<profile>` 占位符；命令旁补一句「回插件页重装」（2026-11-05）

用户在托管 web 实例上看到的是 `dsh plugin --profile <profile> add dsh-better-sidebar@0.28.2`——
`<profile>` 是原样占位符，这条命令复制出去根本跑不了。

1. **命令里写真实的配置名。** 宿主健康载荷里的 `profile` 是配置目录的绝对路径
   （托管 web：`/home/fg/.dsh/profiles/web`；桌面版：`…\.dsh\profiles\desktop`），
   取最后一段就是配置名（`web` / `desktop`）。新增工具函数 `pluginFailureProfileName`
   负责这件事，`/` 与 `\` 两种分隔符都处理；取不到时仍回落成 `<profile>`
   （不崩、不显示 undefined/null）。

2. **命令旁边补一句「不习惯用命令可以回「插件」页重装」。** 新增词条
   `pluginFailure.reinstallHint`，并写明**从界面重装拿到的是最新版，不是备份里这个版本**
   （上面那条命令装的是备份里的那个版本，两者不是一回事，读者必须知道自己将要拿到哪一个）。
   这句只在真的有命令的分支里出现；没有命令的分支（`pluginFailure.noCommandHint`）不出现，
   免得又变成一句没有下文的承诺。

## 0.9.1

- 安全修复（外部报告，已私下协调披露）：会话 id 传 `__proto__` 时，读取会话状态的代码会落到 `Object.prototype`，
  于是后续字段写入会污染宿主进程里每个普通对象。现在状态表一律只认自有属性，并对 `__proto__` / `constructor` /
  `prototype` 这三个 id 在工具与 HTTP 路由两侧统一拒绝。
- 会改状态的 HTTP 路由现在要求 `Content-Type: application/json`：跨站页面无法再用简单请求触发它们。
- 新增 13 条回归测试；同一批断言在修复前的代码上有 9 条会失败。

## 0.9.0

- 收窄到「重启」本身：删除看门狗自动救援与手动救援脚本，出事后交给 DSH 自己的崩溃对话框或重装
- 保留：排队重启、重启前快照、登录 cookie 清理、会话续接、托管端按命令重启、关机倒计时
- 文档与插件描述同步改写，不再宣称任何自动还原能力
- 设置页文案同步：备份说明从「起不来会自动回退」改成「存档，插件不会自动用，要回退自己点」；
  唯一例外是你自己装的「开机自启」守护，它仍会在宿主起不来时回滚上次快照
- 升级清理：从 0.8.x 升级后首次启动会删掉旧看门狗留下的计划任务与 5 个状态文件

## 0.8.6 — 2026-11-03

本版把 2026-10-30 的首批改动与之后累积的六批改动一并发布（0.8.6 在此之前只写进过 CHANGELOG，一直没有对外发布过）。逐批见下。

### 修正：重启一直没触发、重启「截止时间」概念拆除、备份清单如实记账（2026-11-02）

这一轮全部围绕「界面/日志说了假话」和「等不到的重启」两件事。

#### 1. 重启永不触发：目标驱动的会话把安静窗口无限重置

**症状**：`/health?state=1` 显示 `allowRestart: false`、`quietForMs` 一直很小、`blockedBy` 里挂着一条**目标驱动**的会话，重启等了几十分钟也没发生。

**根因**：目标驱动的会话每跑完一轮就立刻起下一轮，于是「最后一次活动时间」被无限推后，安静窗口永远凑不满；闸门就一直不放行，而**没有任何地方把这个原因说出来**——用户只看到「重启没发生」。

**修法**：新增两个诊断字段（`restartGate` / `quietResetBy`），把「闸为什么没开、安静窗口是被谁重置的」直接写进 `state` 载荷：一眼能看出是「有人在跑」还是「跑完又立刻起下一轮」。行为不变，可见性补齐。

#### 2. 重启等待不再有「截止时间」（按用户口径：一直等，直到所有会话空闲）

**症状**：状态里出现 `deadlineAt` / `deadlineInMs` / `deadlineCutsTheRequest`，页面/日志里出现「截止时间已过」。读者（包括维护者本人）一律理解为「请求作废了」——**但它从来没作废过**：默认配置下这些数字一个都不影响结果，只是把人吓一跳。

**修法**（代码侧已随本轮改动落地，文档同步更新）：

- `restartRequest` / `state` 载荷**不再输出** `deadlineAt` / `deadlineInMs` / `deadlineCutsTheRequest`，改为 `waitsUntilIdle: true`；
- 闸里删掉软/硬期限与「到点告警」分支：只要有会话在跑就是 `long-wait`（`reason: waiting-for-conversations`），**没有任何计时器、超时或默认值能让请求结束**；请求只有两种结局——闸门放行，或用户显式撤回；
- 「等很久」也不再等某个阈值才显示：请求一被挡住就报「已等多久 + 谁在挡」，日志与胶囊同步；
- `deferSoftMs` / `deferHardMs` / `deferPolicy` **读入但完全无效**，仅为兼容旧配置文件保留（建议下一版删除）；
- `forceRestartWhenBusy` 保留、默认关闭，语义明确为「**会打断正在运行的会话**」，不再被当作截止时间。

#### 3. 急救开关在「只剩一个 bundle 的 profile」上写坏 JSON（Windows 救援路径不可用）

**症状**：`emergency-toggle.ps1 -Action enable` 在单 bundle 场景下拼出的 JSON 多/少一个逗号，脚本自校验失败 → 自己回滚 → `exit 1`。也就是「Windows 上出事了想急救，开关根本打不开」。

**修法**：修正逗号插入位置；并把它钉成断言（修好之前那条断言是红的），避免再次悄悄回归。

#### 4. 备份清单没记账 → 界面误报「备份里没有」

**症状**：`dsh-codekg` 的文件明明在 `node_modules-link/dsh-codekg` 里，界面却说「备份里没有这个插件」。

**根因**：判断「副本里有没有它」用的是**活档的安装形态**（`node_modules/<name>` 是不是符号链接），而活档形态会和备份时刻不一致。

**修法**：manifest 新增 `plugins: [{ name, version, install }]`（只记真正拷进 `node_modules-link/` 的成功项，版本取副本自己的 `package.json`）；读取端顺序改成 **manifest → 扫目录 → 活档标志**，老副本没有该字段时扫目录兜底。真机实测：同一份备份上，`dsh-codekg` 由「备份里没有」变成「跟备份不一样」。

#### 5. 插件列表收敛：只列自研，内置/第三方各一句（文案纠正）

- 逐条列出的只有**能真正回退的**插件（链接安装的，或副本里确实有文件的），各自带「已在备份里 / 跟备份不一样 / [只恢复 X]」；
- **内置插件**：「另有 N 个内置插件：DSH 自带，不需要备份」；
- **第三方插件**：「另有 N 个第三方插件：**我们没有备份它们**，真出事时需要重新安装」；
- 删掉「备份里只有名字和版本」这类**暗示备份里有东西**的说法（中英都改）。

#### 6. 桌面快捷方式图标与设置页同源

`.lnk` 的 `IconLocation` 与设置页显示的图标现在来自**同一个** host 字段（`rescue.iconPath`，同一次存在性校验）；取不到图标时两边都明说「没有」，`.lnk` 省略图标而不是失败。同时修好了桌面定位：优先读注册表 `User Shell Folders\Desktop`，并按 GBK 解码 `reg.exe` 输出（否则桌面在 `G:\桌面` 这类中文路径上会被判成「找不到」而回落到猜的 C 盘目录）。

#### 7. 桌面救援快捷方式图标改用插件自带 icon（不再借用 DSH 可执行文件）

桌面救援快捷方式的图标现在是插件随包的 `assets/icon.ico`，**不再拿 DSH 自己的可执行文件顶替**——桌面上看到的是「救援工具」，不是那个已经坏掉的程序。包内没有这个图标文件时，`.lnk` 仍然会创建，只是不写 `IconLocation`（也就没有「图标路径不存在 → `Save()` 抛异常 → 快捷方式建不出来」这条风险）；运行期不会生成图标，也不回退到别的程序的脸。非 Windows 平台不提供桌面快捷方式，设置页给的是可复制的还原脚本命令。

#### 8. 排队重启在会话静默后永不触发（轮询器把自己停了）

**症状**：点了重启，界面说「已排队」；后来所有会话确实静默了，重启却一直没发生。`/health?state=1` 里 `restartGate.at` **冻在某一刻不再前进**（真机读数：`at` 停在 `23:09:21`、`waitedMs ≈ 719640`，也就是 12 分钟没再评估过一次），而重启请求的记录文件一直写着 `pending`。

**根因**：`tick()` 的停止条件把「还有没有排队中的请求」判给了**内存里的意图**。会话静默后内存意图被清掉 → `queuedRestartRecord()` 答 `null` → 轮询器认为「没有在等的请求」→ `stopPolling()` 自己退出 → **闸门从此再没被评估过**。记录文件还在说 pending，但已经没有人去读它了。

**修法**（两处，各自只认事实）：
- `queuedRestartRecord()` 直接读 `readRestartRequestRecord(stateDirOf())`，把 `queued` / `deferred` 当作 pending，**不再去问 `restartRequestInfo()`**——那个函数是给界面**汇报**用的，不该承担「现在该不该继续轮询」的判据；
- `summarizeRestartRequest()` 在内存意图已消失（`live === null`）但记录仍是非终态时回 `pending: true`：状态载荷不会因为意图没了，就把「还在排队」说成「没有请求」。

**可观测性（用户明确要求）**：闸门的判定结果（`allowRestart` / `quietForMs` / `blockedBy` / `reason`）被写进状态，下次打开 `?state=1` 就能看见「为什么还没放行、是谁在挡」，不再只留在日志里。

> 附一条测试侧结论（见 `docs/real-machine-verification-0.8.6.md` 的证伪实验）：上面第二处修法被回归测试钉住（把它回退掉，断言立刻变红）；**第一处没有被任何测试覆盖**——因为第二处让「汇报函数」自己也能答 pending，旧写法的第一处照样工作。第一处仍然保留：它的价值不是「再算一遍同一件事」，而是**不让轮询器依赖一个汇报用的函数**（当初的 bug 恰恰就是轮询器去问汇报器、汇报器答错）。

#### 9. 删掉「某个插件起不来？退回它的上一个版本 / 立即检查」入口

**为什么删**（用户决定，2026-11-02，原话意思是「没法定位具体哪个插件坏了」）：这个入口只能按「跟备份不一样」把插件列出来，那是一个**线索**，不是**诊断**。留一个做不到的承诺，比没有这个入口更糟。

**删了什么**：客户端与 web 端挂的是同一块，所以删一次两端都没了——整块 `pluginRecoveryItems`（标题、`立即检查` 按钮、「还没检查。点『立即检查』看看每个插件现在的状态。」空态、逐插件行与「只恢复 X」按钮、「另有 N 个内置/第三方插件」两句）、驱动它的 `usePluginRecovery` 钩子、`pluginInventoryRows` 与 `SETTINGS_STATUS_KEY`，`client.js` 净减 **214 行**；两个挂载点（设置页的备份折叠区、插件配置页）一并删除。

**词典同步收口**：12 个键 × 中英两份 = 22 条，镜像键数 **406 → 394**（两份逐键一致）；另删掉两处指向它的「引子」——折叠标题下的「内含：某个插件起不来？退回上一个版本」，以及桌面救援说明里「只想摘某个插件，请用上面『某个插件起不来』」这半句（英文镜像同步改）。删完在 `client.js` 与两份镜像里 grep，全部 0 命中。

**没有动后端**：浮动故障卡自己的恢复路径（`pluginInventoryUrlFor` / `restorePluginOnce` / `PluginFailurePanel` / `pluginFailure.restore`）全部保留且仍在调用——删掉的只是「在设置页/配置页列出所有插件并逐个回退」这个入口。

#### 10. 桌面快捷方式的图标从来自愈不了（重启多少次都还是旧图标），顺带修掉「跑测试会改写用户真桌面」

**真机症状**：`.lnk` 的 `IconLocation` 一直停在旧图标 `…\shortcut-icon-9c245e5b.ico`，写入时间是 `2026-11-02 23:02:33`——**宿主已经重启、新代码已经加载之后，它仍然指着旧图标**。也就是说「图标改用插件自带 icon」这件事，只对**当时点过按钮**的人成立。

**根因**：`createDesktopShortcut` 在全仓只有一个调用点（`index.js` 里 `POST action === 'shortcut'` 那条路由）。启动路径**从不写 `.lnk`**，所以旧快捷方式不会随着版本更新被纠正——重启一百次也不会自愈。

**修法**：`lib/rescue-paths.js` 新增 `readShortcutLink()` 与 `syncShortcutIcon()`：读回 `.lnk` 的 `TargetPath` / `IconLocation`，与「本版本应该用的图标」比较，**只有不同才写**；写完用 `SHChangeNotify` 让壳刷新图标缓存；`TargetPath` 原样保留（快捷方式仍然指向 `restore-profile.cmd`）。`index.js` 启动路径加一次校准，整段用 `try/catch` 包住——校准失败绝不拖累启动。图标文件名按内容哈希算，代码里没有硬编码 sha。

**真机读数**：修后 `IconLocation = …\storages\dsh-autorestart\shortcut-icon-1902bb15.ico,0`，`TargetPath` 仍是 `restore-profile.cmd`；第二次 sync 返回 `already-current`（幂等，不重复写）。

**顺带修掉的更糟问题**：在加这层 guard 之前，**跑一遍全量测试会把用户真实桌面上的 `.lnk` 改写**成 `%TEMP%` 里的图标——实测读到 `…\Temp\dsh-autorestart-it-recover-now-idle-…\shortcut-icon-1902bb15.ico`。测试环境的东西跑到用户桌面上去了。已加 `isInsideTempDir()`：**临时目录里的图标永远不会被写进真快捷方式**。

#### 11. 排队重启被作废之后，用户完全看不见发生了什么

**真机症状**：`2026-11-02 23:04:38` 请求的重启一直排队，等了 `8473292 ms`（约 **2 小时 21 分**）从未执行；宿主重启后，新实例的 boot-recovery 把它判成 `cancelled`（理由含 `stale-never-executed`）。而**设置页上什么都没有**——用户看到的是「没有排队重启」，就好像他从来没点过。

**修法**：设置页顶部加一条可见提示（`role=status`，标记 `data-dsh-autorestart-restart="cancelled-note"`，文本节点 `cancelled-text`），只有当最近一次请求 `state === 'cancelled' && by === 'boot-recovery'` 时出现。内容三件事：请求时间（`2026-11-02 23:04:38`）、人话时长（`约 2 小时 21 分`；≥60 分说「约 N 小时 M 分」、<60 秒说「几秒」）、以及「想重启再点一次就行」。

**不漏内部标识符**：`reason` 字段根本不参与渲染；测试逐串断言页面上不出现 `boot-recovery` / `stale-never-executed` / `deferred` / `queued` / `attempts`。**也不常驻**：从未请求、仍在排队、正常完成、用户自己取消、被别人取消——五种情形各有断言，都不画。

#### 12. `health.backups.available` **恒为 0**（不是偶尔算错，是永远算不出别的数）

**真机症状**：`health` 报 `backups.available: 0`，而磁盘上两份备份都在，其中一份 `intervention: false` + `certifiedBy: full-checks` 的那份**确实可还原**。

**根因**：`available` 是在一份**给页面看的投影**上判资格，而那份投影里**没有 `boot`、也没有 `trigger`** 这两个键（键不出现，不是 `null`）。资格判据要的正是一份副本「启动记录」是否证明它起来过、内容是否匹配——投影把证据裁掉了，所以判据永远拿不到料，结果**常数 0，永远不会变成别的数**。而真正的证据一直在读路径里（`readBackupMeta` 会翻译旧记录：旧 seed → `first-install`，旧签 + 指纹匹配 → 一段可用的启动事实），`listBackupIdentities` 也带着这两个字段。

**修法**：先取完整记录 `identities`，投影 `items` 仍由它派生（**投影字段一个都没增**），`available` 改在 `identities` 上统计——与看门狗、回退助手**同一个函数**，不再是两套尺子。

**为什么长期没被发现**：**没有任何一条测试断言过 `available` 的取值**。已补 4 条：根因复现（投影喂判据必为假）、三份同形副本的逐份计数、与 selector 同判据（两集合必须一致）、seed 靠 `trigger` 仍算可用；并做了证伪——把实现改回旧写法，其中 3 条立刻变红。

#### 13. 测试套件把临时目录漏在 `%TEMP%` 里（跑了几个月，攒下 13 万个目录）

**症状**：本机 `%TEMP%` 下的可用空间在慢慢变少，但没有任何一处报错——因为每次测试都"成功"。

**真实规模**（先把估算纠对）：先前只数了一个前缀，得到 `34448 个 / 4.17 GB`，**那是低估**。按本插件实际用到的**六种前缀**统计——`dsh-autorestart-*`、`dsh-restart-request-*`、`dsh-ar-*`、`dsh-ledger-*`、`dsh watchdog <label> `（含空格）、`ar-*`——实测共 **131,151 个目录 / 1,219,987 个文件 / 14,350 MB**。

**根因**：测试里到处 `fs.mkdtempSync(path.join(os.tmpdir(), <前缀>))`，但**没有任何一处负责删**。测试成功也漏、失败也漏；`node --test` 跑一次就多一批，几个月下来就是这个量级。

**修法**：新增 `test/_tmp-guard.mjs`——包装 `fs.mkdtempSync` / `fs.mkdtemp`，把落在 `os.tmpdir()` 下、且带本插件前缀的结果记进**本进程的集合**，在 `process.on('exit')` 里逐个删；同时导出 `cleanupTempDirsNow()` 供需要提前清的地方兜底。67 个测试文件首行加一行 `import './_tmp-guard.mjs'`。

**证据（干净窗口）**：`131151 → 跑完全量 → 131151`，**新增 = 0**；失败场景同样清——在一份副本里加一条必失败的测试，跑完 delta 仍为 **0**（说明守卫不靠"测试成功"这条路生效）。

**历史残留已清理**：两轮共删约 **12.9 万个**目录（123,788 + 5,215 + 2），**失败 0**；可用空间 **92.7 GB → 108.17 GB（释放 15.5 GB）**；`%TEMP%` 顶层目录 **5,942 → 725**；本插件六种前缀剩余 **0**。


### 修正：恢复插件后的可用性没有被验证

旧版本在恢复插件时，只把备份里的文件拷回原位，**不检查恢复出来的插件能不能正常加载**；恢复完成后即记为成功。实测中出现过「报告成功、插件仍是坏的」以及「把一份本来就坏的备份当成可以回滚的那份」两种情况。

0.8.6 起：
- 备份的身份需要证据——只有**当前正在运行、且四项启动检查全部通过**的那一份才会被写成 `known-good`；
- 恢复目标只在这类 `known-good` 备份里选；**一份都没有时不动手**，并在报告里写明原因；
- 每个备份记录它**凭什么**被写成 `known-good`（比对内容指纹），拿不出这份记录的旧备份一律不采信。

### 修掉测试的「墙上时钟依赖」

**症状**：同一份代码，08:56 全量 999/999 绿，09:01 变三条红（`integration.test.mjs` 的「boot pass restores…」、`plugin-recover.test.mjs` 的「THE BOOT PASS ONLY LOOKS…」与「a clean previous boot writes no report at all」）。

**根因**（不在实现，在 fixture）：`lib/plugin-recover.js` 的 `findLatestStartupLog` 用 `log.mtime <= cutoff` 判断"这是上一轮已结束启动的日志"——这是被测行为，**一行没动**。而这几处测试把 `bootAt` 写死成 `2026-11-01T01:00:00Z`（北京 09:00），它们写出的启动日志却是 `writeFile` 落的盘，**mtime 是运行时真实时钟**。于是真实时间一越过 09:00，日志就被判为"本次启动写的"，查找返回 `null`，三个用例同时红。

**修法**：把日志的 mtime **钉死到它自己描述的那一刻**（`fs.utimesSync`），让测试与墙上时钟彻底解耦；同时把两个 fixture 的"日志时刻 / 启动时刻"提成命名常量（`LOG_AT` / `BOOT_AT`、`RECOVERY_LOG_AT` / `RECOVERY_BOOT_AT`），避免有人把 `bootAt` 推到未来去"修"它——那等于改掉被测语义。

- `test/plugin-recover.test.mjs`：新增 `pinLogTime()`，`writeStartupLog` 与另外两处直接写日志的用例（clean boot、sinceMs guard）全部走它。
- `test/integration.test.mjs`：`pluginRecoveryFixture` 写完日志即钉 mtime（早于它用到的两个 `bootAt`）；「只读更早启动的日志」那条用例仍然在之后把 mtime 顶到 `01:00:04Z`，语义不变。
- **新增 2 条守卫断言**：`the boot-pass fixture pins its log strictly BEFORE the boot under test` / `the plugin-recovery fixture pins its log strictly BEFORE the boot under test` —— 断言 `logMtime < bootAt`、盘上 mtime 约等于钉死值（容忍文件系统取整）、且钉死之后 `findLatestStartupLog` 仍然找得到这份日志。以后谁再引入"靠 now 决定"的 fixture，会当场红。
- 实测：修复前 09:01 三条红 → 修复后 **09:04 全量 1001/1001 绿（exit 0）**；拷问脚本显示钉死后 mtime = `2026-11-01T00:00:01.100Z`，距 bootAt 恒 +3598.9 秒，与真实时间无关。
- 断言**一条没删、一条没放宽**，只是把 fixture 的时间来源从"现在"换成"它描述的那一刻"。

### 收敛：启动只提示不改文件、按需恢复单个插件、守夜人全部删除

> **这一节取代下面「报错型插件故障：自动换回好版本、只重启一次、写出可读报告」那节里的自动恢复部分。** 那节的检测、纯函数和报告格式都还在用；被拿掉的是「启动时自己动手 + 自己请求重启」。

#### 用户拍板（2026-11-01）

三件事，两件是"少做"，一件是"补上缺的那半"：

1. **不要再自动修** —— 实测证明 DSH 自己就能剔除坏插件并照常起来：桌面版 22 秒正常启动、坏插件路由 404、配置不动；WSL 托管版 2.0–2.6 秒起来、`package.json` md5 五次一致、守护脚本 62.9 秒内只 +1 次启动。插件再插一手自动恢复，等于在启动路径上多一个改文件的写者 + 多一次自动重启。
2. **把提醒搬到前台** —— 原来"检测到了"这件事只落在 health 字段和日志里，用户看不见。现在弹出来：哪个插件坏了、报了什么错，并给**一个**选项「只把这一个插件恢复到上一个备份版本」。
3. **守夜人（sentry）全部删掉** —— 与「关就是关」冲突，不再维护。

#### ① 启动路径：只读、只写报告，不动文件、不请求重启

- 启动时改调新函数 `detectPluginRecovery()`（`lib/plugin-recover.js`）：读**上一次启动**的日志 → `findPluginFailures` 解析 → `mergeFailuresByPlugin` 归并 → 写 `<stateDir>/last-plugin-recovery.json` → 暴露 health 字段。
- **启动路径不再调用 `applyPluginRecovery`，也不再调用 `requestRestart`**（单测钉住：恢复前后 profile 里每个文件的 sha256 不变、没有 `<plugin>.broken-*` 证据目录、`state.restart === null`）。
- 报告里的 `actions` **恒为空**：什么都没做，就不能写"overwrite"假装恢复过。`backupKind` / `restoredAt` 仍然填（回答"有没有备份可恢复、恢复到哪个时点"），弹窗据此决定按钮是否可用。
- `plugin-recovery.json`（attempt 预算 / handled 指纹）**启动路径也不再写**：自动恢复没了，这两个记账就没有读者了。
- `runPluginRecovery()` / `collectPluginRecovery()` 保留导出（现有集成测试直接驱动它们，且逻辑本身没错），但**启动流程不再调用**。

#### ② 新增按需入口：只恢复一个插件

- `POST /__dsh_autorestart/plugin-restore`，body `{ "plugin": "<name>" }`。
- 返回 `{ ok, plugin, mode, restoredFrom, restoredAt, backupKind, needsRestart }`（另带 `changed` / `evidence` / `at` / `reason`）。
- 只恢复**被点名的那一个**：真副本 → `overwrite`（现场目录先改名为 `<name>.broken-<ts>` 留证据，绝不删除）；链接安装 → `replace-link`（软链同样改名留证据，备份内容顶替）。
- **幂等**：现场已等于备份 → `already-consistent`，不写任何文件，`needsRestart: false`。
- **失败也是 HTTP 200**：`ok:false` + `reason`（"没有备份" / "拷不进去"）。500 会让浏览器分不清"没有备份"和"宿主崩了"。
- 每次尝试写 `<stateDir>/plugin-restore-history.json`（最多 20 条，最新在前）；health 新增 `pluginRestore` 字段带最近一条。`pluginRecovery` 的形状**保持不变**（`continuum_status` 的严格 output schema 也没动）。
- 这一条路径**跳过**自动恢复的两个循环守卫（`duplicate` / `needs-human`）：那两条是"机器该不该自己动手"，人再点一次不是循环；幂等检查仍在保护磁盘。

#### ③ 前台弹窗（`client.js`）

- 新增 `PluginFailurePanel`，挂在 `conversation.input.dock`（和安装提问、新功能公告同一个位置：不盖界面、不碰倒计时）。
- 显示：标题「有插件没加载成功」、每个插件的名字 + 它报的错（最多 3 条，其余只报数量）、备份时间、以及每个插件一个按钮「只恢复 <plugin>」。没有可用备份时按钮不出现，直接说"只能手动处理"。
- 点完就地显示结果：恢复成功（重启后生效）/ 已经和备份一致 / 恢复失败的原因。
- 新增中英词条 12 条（`pluginFailure.*`）。

#### ④ 守夜人删除

- 删除 `lib/sentry.js`、`lib/sentry-install.js`、`supervisor/sentry.js`、`test/sentry.test.mjs`、`test/sentry-install.test.mjs`、`docs/sentry.md`（共 6 份）。
- `README.md` / `docs/README.zh.md` 的"未接线备用件"段落改写成「已移除（2026-11-01，用户拍板：与『关就是关』冲突，不再维护）」。
- 源码里**没有任何 import 引用**过它（这几份文件本来就是未接线的备用件），所以删掉不影响任何加载路径。
- **清理守夜人残留引用**（3 处，都指向已删除的文件/概念，删完才不留悬空指针）：
  - `package.json` 的 `files` 数组删掉 `"supervisor/sentry.js"` —— 那个文件已经不存在了，留着只会让打包清单指空；
  - `lib/watchdog.js` 里"用尽次数"的失败文案由「rely on the sentry」改成「no further rollback will be attempted」，如实描述现在的行为：看门狗是**最后一道自动步骤**，它放弃之后就得人来看报告（同时把该处注释补上这个理由）；
  - `test/watchdog.test.mjs` 里那条 `/sentry/` 断言不再是「指向谁接手」，改成**正向断言新文案** + **反向断言旧词已不存在**（`doesNotMatch(/sentry/i)`）——断言没有删，只是跟着文案走。

### 报错型插件故障：自动换回好版本、只重启一次、写出可读报告

#### 缺口

「坏法」有两种，原来只接住了其中一种：

- **进程级**（宿主根本起不来，比如 `EADDRINUSE`）——已有看门狗 + 重启前快照负责，这次不动；
- **报错型**（宿主起来了，但某个插件 entry **静默没激活**，功能直接 404）——原来**没有任何人管**：日志里明明写着 `<plugin>: failed to import: <error>`，界面却一切正常，用户只会看到某个功能"莫名其妙没了"。

#### 现在

- **检测**（新增 `lib/plugin-failure.js`，纯函数）：`findPluginFailures(text, { sinceMs, logAt })` 认得四种真实日志行 —— `dsh: warning: N entry did not activate`（总括行，不点名）、`<plugin>: failed to import: <err>`、`<plugin>: import failed ...`、`- <plugin>: loading`（审计时还停在 loading，等于没激活）。**不认识的行一律忽略**：尤其**故意不认**进程级启动失败那段 `startup failed: ... / Failed plugins (1): ... / Error: EADDRINUSE` 转储 —— 那是看门狗的活，两个机制抢同一件事只会互相打。
- **恢复**（新增 `lib/plugin-recover.js`）：拿最近一次身份为 `known-good` 的备份里该插件换回现场。
  - 备份有 `node_modules/<name>` 真副本 → `overwrite`：现场目录**改名**为 `<name>.broken-<ts>`（**留证据，绝不删除**），副本拷回去；
  - 备份只有 `node_modules-link/<name>`（链接安装的内容）→ `replace-link`：现场软链同样**改名留证据**，备份内容顶替（与既有 force 语义一致）；
  - 备份里没有 / 插件不在本 profile 启用清单里 → `no-backup`：**不动**，写清原因。
- **幂等**：拷贝前先比现场与副本（相对路径 + 大小 + sha256）；一致就 **不拷、不重启**，决策记 `already-consistent`。
- **防循环（硬要求）**：
  1. 同一份旧日志不许被当成新故障 —— 只读**上一次启动**那份日志（本次启动写的那份还不可能有自己的审计结论），行时间早于该次启动的一律不算，再用「插件 + 错误首行 + 日志时间」做**指纹**，指纹进 `plugin-recovery.json` 的 `handled` 后只能处理一次（再遇到记 `duplicate`）；
  2. 根因不在插件（缺 peer 依赖、缺宿主能力）时换回也没用 —— **同一插件一个周期内只动手一次**，第二次只报不动、`needs-human`，且**不请求重启**。一次没有任何插件故障的启动会把周期清零。理由更正确：恢复是拿好版本顶替现场，恢复完现场就是好代码，所以**不存在"越修越坏"的循环**，真正的循环只有上面两个。
- **只改过文件才重启**：`no-backup` / `duplicate` / `already-consistent` / `needs-human` 四种情况的 `restartRequested` **恒为 false**（有单测钉住）。重启走**现有入口** `requestRestart`（同一个 gate / 快照 / 续跑），**没有第二套重启机制**。
- **接入启动流程**（`index.js`）：启动后、写 ready 标记之前跑一次 —— 读日志 → 检测 → 计划 → 恢复 → 写 `<stateDir>/last-plugin-recovery.json`（`{ at, atIso, failures[], actions[{plugin,mode,restoredFrom,restoredAt,backupKind}], restartRequested, needsHuman }`，其中 `restoredAt` / `backupKind` **取备份自己的 meta**，回答"恢复到了哪个时点"）。
- **可见**：health 路由新增 `pluginRecovery` 字段（没发生过就是 `null`），`continuum_status` 工具同样返回它，并**同步写进工具 output schema**（严格 schema 下漏声明一个字段会让整个工具报废）。

#### 分工（写进 README 与中文 README）

| 故障 | 谁负责 |
|---|---|
| 进程级：宿主起不来 | 重启前快照 + 看门狗（`lib/watchdog.js` / `lib/restart.js`），回滚 + 拉起 |
| 报错型：宿主起来了、某个插件没激活 | 本条：检测 + 换回好版本 + 一次重启 + 报告 |

两条路径不共享状态、不互相触发：`pluginRecovery` 只描述"报错型"的事。

#### 验证

- `node --test plugins/dsh-autorestart/test/*.test.mjs` → **1067 / 1067 全绿**（基线 1017，本次 +50）。
- 新增单测：`test/plugin-failure.test.mjs`（四种行、无关文本 → 空数组、进程级转储 → 空数组、`sinceMs` 窗口、指纹稳定/去重、超长截断）、`test/plugin-recover.test.mjs`（四条分支、改名参数断言、幂等、attempt=1 允许 / attempt=2 拒绝、报告字段与 meta 来源、日志挑选）、`test/integration.test.mjs` 追加 10 条（端到端恢复与报告、四种"不重启"、只读上一轮日志、health 字段与工具 schema）。

### 链接安装的插件现在也进备份、也能被还原

#### 缺口（实测发现的真问题，不是为实验造的）

profile 的 `node_modules` 里有 **5 个插件是符号链接/联接**（`dsh-autorestart`、`dsh-codekg`、`dsh-github-guard`、`dsh-release-board`、`dsh-secret-vault`，都指向 `Documents\deepseek-harness\default-workspace\plugins\<name>`），而身份为 `known-good` 的备份里 **118 个真副本、0 个链接插件**：备份把链接本身记下来了，链接**背后的内容一个字节都没有**。后果是**负责救命的 dsh-autorestart 自己也救不回来**。

#### 现在

- **备份**（`lib/backup.js`）：新增 `collectLinkedPlugins`（只收 `dsh.profile.bundles` 里启用的、指向目录的 reparse point），`manifest.json` 新增 `links: [{name, target, kind, exists, readable, copied, files, bytes}]` + `linkFiles` / `linkBytes`，链接的**内容**另存 `node_modules-link/<name>/`（不和真副本混在一起）。本机实测 5 个插件 1216 个文件 / 69.5 MB。清单只加字段、不改名 —— 三个读者（还原脚本、看门狗、`lib/rescue.js`）都不受影响。
- **还原**（`scripts/restore-profile.ps1`，仍是纯 ASCII 无 BOM）：新增 `-ForceLinkPlugins` 开关；**默认档**保留健康的链接（开发目录继续“改完即生效”），**force 档**用备份内容顶替。每个链接插件都打印一行结论 `kept` / `replaced` / `target-missing` / `no-backup`（**不许静默跳过**），顶替原因写进 `links-restore.txt`。
- **看门狗**（`lib/watchdog.js`）：和脚本共用同一套判定（`decideLinkRestore`）——目标不存在/读不了 → 顶替；**第一次给链接一次机会，`attempts >= 2` 就顶替**；没有副本 → 不动它（**绝不删掉放不回去的东西**）。
- **顺手修掉两个真机踩到的坑**：
  - `fs.cpSync` 往一个**带死链接**的 `node_modules` 里写会直接把 Node 进程打死（Windows，`0xC0000409`，无栈无消息），而 `fs.existsSync` 对死链接返回 **false** —— 现在先按 `lstat` 认出死链接、清掉再复制；
  - `rescue-strings.zh.json` 的 `restore.snapshotSuffix` 有 2 个占位符、调用只传 1 个参数 → 快照配置坏了的时候脚本不是报「这份快照不是 profile」而是格式化报错直接挂掉。

### 2026-11-03 桌面档演练失败与三处修正

**演练失败读数（12:49:19 → 12:51:51，原样）**：12:49:19 的 `last-watchdog-report.json` = `result: armed`、`tier: none`、`arbiter: v1`、`armOutcome: failed`、`armError: null`、`armFailedSteps: []`；`watchdog-pending.json` **从未出现**；12:49:25 新宿主读坏清单崩溃（**崩溃日志本机找不到**：`.dsh` 全树按 12:45–12:55 扫描只看到 `clear-cookies.log` 与 `last-cookie-clear.json`（均 12:49:24）、`restart-276.cmd` 与 `restart-gate.json`（均 12:49:19），`.dsh\logs` 里最新的启动日志停在 10-31）；12:51:51 兜底计划任务 `LastResult = 1`、**脚本一行没跑**；之后两次手工跑 `restore-profile` **只还原了 `config/`**，`node_modules` 没还原 → 插件全丢。

**三处修正**：

- **布防不再依赖清单**（t65 → 收口 t66）：布防阶段不再需要读那份可能已经坏掉的清单。全量 **1451 / 1451**；新增测试 **3** 条；证伪 A / B / C / D；CodeKG `diff ok`、verify **70 / 70**。
- **体检 → 按需修复**（t67 + t69）：`lib/profile-health.js` 给出**三种答案**；**只补缺的**，改完**回读**，**幂等**；还原脚本支持 `-CheckOnly`；看门狗判定 fine 时**不还原**；补 parity 测试，证伪「只改一边 → parity 必红」。自跑 verify **64 / 63 / 0 / 1 skip，exit 0**。
- **报告不再说假话**（t60–t62）：看门狗**每落地一个事实就写一次进度报告**，撤防按「是否真的救过」判 `recovered` / `disarmed`，不再把 `restored` / `relaunched` 抹成 `false`。

**一条纪律（写下来，别再犯）**：**在用户正在使用的 profile 上做「注入坏清单」演练本身不成立**——故障材料与布防材料是同一份文件，注入故障等于把布防材料一起弄坏。以后**只许在隔离实例上做**，且**故障必须出现在布防之后**。

### 2026-11-03 隔离 WSL 实例上的复验（t71–t74）：布防 → 还原 → 拉起走通了

桌面档演练失败之后，同一天在**隔离的 WSL 实例**上重做了这件事（WSL `Ubuntu-22.04` / 用户 `fg`；profile `~/.dsh/profiles/web`，链接安装；状态目录 `~/.dsh/storages/dsh-autorestart`；守护循环 `~/supervise-web.sh`；布防入口 `POST /__dsh_autorestart/park`，**body 必须带 `{"sessionId":"…","restart":true}`**，否则只答 `restartRequested: false`）。

- **布防成功（t71 → t73）**：坏清单下 `watchdog-pending.json` **出现了**（t+10s…t+240s 每次采样 `pending=YES`），报告 `result: "armed"` / `armOutcome: "armed"` / `armError: null` / `armFailedSteps: []`（旧代码是 `armOutcome: failed` / `tier: none` / `armFailedSteps: ['there is no profile directory to restore into']`）。
- **布防要拿 profileDir，而 profileDir 也是从清单推出来的（t72 + t73）**：真机读数 `error: the profile directory is unknown` → 宿主每次**成功启动并确定 profileDir 之后**把它作为**事实**持久化（复用既有 `state.json`，带 `at` 与来源）；布防按 **运行时内存 > 持久化记录 > 快照** 三条取路，三条都失败时把**各自的原因**逐条写进 `armFailedSteps`。修完：`state.json` 里出现 `"profileDir": { "dir": "/home/fg/.dsh/profiles/web", "at": 1793690696061, "source": "profile bundles scan" }`（旧代码没有这项），布防 `armOutcome: "armed"`。
- **快照失败不再关掉还原点（t74）**：快照失败时仍然对既有副本调用 `selectRestoreTarget`，挑不到时把**拒因逐条写清**并给下一步。真机读数（15:43:00–15:47:29）：`restored: true`、`restoreTarget: /home/fg/.dsh/storages/dsh-autorestart/backups/2026-11-03T04-16-19-152Z`（磁盘上 `intervention=false`、`boot={started:true, contentMatched:true}` 的那份）、`restoreBlocked: false`、`restores: 1`、`error: null`、`restoreCandidates: [{name: "2026-11-03T04-17-07-466Z", exclusion: "intervened"}]`；**t+250s：`listening=1`、`manifest=3120c71a90877bfc…`、新 bootId `bb888192-b3c3-40c2-88a3-b8a1e45a1bef`**；清单 sha 回到原件、**不需要手工放回**、health `{"ok":true,…}` → **实例已恢复正常**。
- **两处口径如实说明**：报告里的 `restoredFrom` 仍是 `null`（这份报告用 `restoreTarget` 承载「还原自哪一份」）；`relaunched: false` —— 宿主是**自己回来的**（守护循环在它起来后把看门狗撤防了）。
- **全量**：**1475 / 1474 pass / 0 fail / exit 0**；CodeKG `diff ok`（27 处改动全部在 allow 内）。

**本轮未实测 / 未观察到的（如实列出）**：`@goodandready/dsh-goal@0.2.33`、`dsh-dispatch-guard@0.2.1` 本轮**未实测**（证据库里没有它们的记录）；**POSIX parity 在本机被 skip**（本机没有 POSIX shell）。

**文档**：两份实测文档合成一份 —— 看门狗各轮真机读数（R1–R55）**全文并入** `docs/real-machine-verification-0.8.6.md`，原文读数逐条保留，原来标着「未验」的仍然标着未验；`npm` 描述里那句「起不来就还原」也收窄成「**这次重启**没回来才还原」。

### 2026-10-30 的首批改动

#### 看门狗：修掉「只许跑一次 / 拉起前不通行证 / 报告不落盘」三个毛病（用户拍板：只改看门狗，守夜人不进主线）

- **① 看门狗任务用真 node 启动，不再拿客户端当解释器。** 注册一次性任务时原来是手拼命令：`'"' + process.execPath + '" "…watchdog.mjs" …'`。在桌面版里 `process.execPath` 就是 `DeepSeek Harness.exe`（Electron 客户端），于是这个"看门狗"每次都会**再开一整个客户端**，看门狗根本没跑过。现在统一走 `buildWatchdogTaskCommand`（`lib/watchdog-schedule.js`）：解析到**真 node**（进程本身是 node → 安装目录自带的 runtime node → PATH），解析不到就**拒绝注册**并把原因写进日志，**绝不退回 exe**。Windows 计划任务把程序与参数交给 XML 的 `<Command>` / `<Arguments>`（不再 `cmd /c` 套壳，引号不会被吃掉）；systemd 那档拿 `[node, script, --state-dir, …]` 数组；detached 那档拿按 `CommandLineToArgvW` 规则加引号的命令行。
- **② 每一轮拉起之前先清 `dsh-auth-*` 通行证 cookie。** 清理顺序固定在 `lib/watchdog.js` 里：还原快照 → **清 cookie** → 拉起 → 等 ready。带着 71 个过期 cookie 拉起来就是再死一次（Cookie 头撑过 16 KB → 431 → 客户端报 "Web authentication failed"）。清理脚本永不阻塞救援（自己 exit 0），但**结果一定写进报告**：清不掉绝不能看起来像清过。
- **③ 失败也一定落报告。** 无论 recovered / not-needed / abandoned / decided / failed / 次数用尽，每一轮都写 `<stateDir>/last-watchdog-report.json`（哪一档、`healthCheck`、试了几次、每次的 `restored` / `cookieClear` / `relaunched` / `ready` / 退避、以及为什么停）。
- **可在有上限的次数内重试，不再"只许一次"**：`maxAttempts`（默认 **3** 次，硬上限 **10** 次 —— `lib/watchdog.js` 的 `DEFAULT_MAX_ATTEMPTS` / `MAX_ATTEMPTS_CEILING`）声明在 pending 标记里；每轮开始前重新问那三个问题（ready / 有实例活着 / health 应答），两次尝试之间的退避是 **15s → 45s**（封顶 45s，`DEFAULT_BACKOFF_MS = [15000, 45000]`；尝试次数更多时沿用最后一档）。快照只在第一轮还原（同一快照再拷一遍改变不了什么），**cookie 每次拉起前都清**。

#### cookie 清理：可覆盖 / 可观测 / 可自证

- **删除条件放宽**：`host_key = '127.0.0.1' AND name LIKE 'dsh-auth-%'`，**不再要求 `path = '/'`**。官方代码总是写 `Path=/`，但漏删一个 cookie 它照样会发到 127.0.0.1、照样占满 16 KB 头；多删一个的代价只是一次重新登录。
- **可观测**：清理脚本把结果写成 `<stateDir>/last-cookie-clear.json`（`{at, atIso, ok, removed, reason}`，`.tmp` + rename 原子写），插件健康路由新增 `cookieClear` 字段暴露「上次清理结果」。**不谎报当前 cookie 张数**：运行中的浏览器锁着 cookie 库，所以 `live` 恒为 `null`，`liveNote` 写明原因；"还没清理过"和"清理失败"是两个不同答案，都不当成成功。
- **可自证**：版本号升到 **0.8.6**；`health` 的 `version` 与 `package.json` 一致（`pluginVersion()` / `PLUGIN_VERSION_FALLBACK` / 包版本三者对齐，有单测钉住），真机上一眼能看出新代码是否真的被加载。

#### 覆盖边界（这次也写进 README 与中文 README）

看门狗是一个**窗口**，不是常驻保安：它只在**我们自己要重启宿主**的那一刻布防，宿主起来后立刻撤掉。**窗口之外没有任何人看着** —— 凌晨被系统杀掉的宿主、手动双击启动即崩的客户端、早上发现 0 进程，都不会被拉回来（插件随宿主一起死了，也没有一次性项被注册过）；那时只剩 `scripts/restore-profile.cmd` 可以手动双击。看门狗也只还原一份快照 + 拉起宿主，修不了宿主自己的 bug。

> 覆盖"窗口之外"的常驻守夜人（0 进程 + profile 被 `sanitizeProfile` 清空）在本仓库里是一份**未接线的备用件**（`lib/sentry.js` / `lib/sentry-install.js` / `supervisor/sentry.js`，见 `docs/sentry.md`）：**不注册任何工具、不会自动安装、没有 clean-exit 钩子**，启用需要另开任务。

## 0.8.5 — 2026-10-30

### 备份

- **每份备份都有身份，自动回滚只认其中一种**（用户决定，2026-10-30）：备份目录里多了一张 `meta.json`，把每份拷贝标成 `known-good`（这份是在一次重启之前拍的，而那次重启的健康检查后来应答了）/ `snapshot`（本次快照）/ `unknown`（旧备份，身份层之前的）。身份记的是「拍完之后发生了什么」，不是对插件可用性的评价。第一次安装时种子一份 `known-good`；每次启动后健康检查应答时，把这次重启前拍的那份提升为 `known-good`；重启失败时只回到最新的 `known-good`——**本次快照永远不会被当成回滚目标**，因为它可能正是坏掉的那一份（改坏插件再点重启就是这个场景）。
- **没有可回滚的身份就不动任何文件**：回滚前先找 newest `known-good`，找不到就零还原，报告里写 `no-known-good: <原因>`，看门狗也不 arm（没有可还原的目标，挂上去只会再写一遍坏配置）。
- **保留 3 份，其中一种身份不参与 prune**：默认 `maxBackups = 3`，超出删最旧的那份，但 `known-good` 不会被 prune 掉。
- **旧备份不会被自动回滚**：没有 `meta.json` 的拷贝（身份层之前的版本）标成 `unknown`，只展示、不参与自动回滚。
- **设置页看得见身份**：备份列表每行先写「身份 · 版本」（`known-good` / `snapshot` / `unknown`），下面是原有的时间与大小；列表上方加一段中文说明，讲清三种身份各自记录了什么、看门狗只还原 `known-good`、第一次安装会种子一份、最多保留 3 份、`unknown` 不会被自动回滚、手动回退会先二次确认再重启。`?state=1` 与 `health?state=1` 的 `backups.items[]` 因此多了 `kind` 与 `version` 两个字段。（0.8.6 起备份列表的行上**不再显示**身份与版本，也不再显示每份的大小——用户决定 2026-11-02，理由是不由插件判定哪一份安全；一行就是「备份时间 + 回退到这一份」，总占用改成列表上方的一句汇总「实际占用 {size}，当前 {n} 份」。`kind` / `version` 仍由宿主给出、仍供自动回滚读取。）
- **可以手动回退到任意一份备份**（含更早、后面没有启动记录的那份）：列表每行多一个「回退到这一份」按钮，点了先弹二次确认（写清还原哪一份、当前状态会被覆盖、还原后会自动重启），**确认后才动**；取消则什么都不发。服务端新增 `POST /__dsh_autorestart/rollback-to`，只接受**备份目录名**（必须是本机列表里的那一份，路径 / 路径穿越直接拒绝），顺序是：①先把当前状态存一份快照（`reason: before-manual-rollback`，所以这次回退本身还能再退回来）②还原选中的那份 ③写 `last-manual-rollback.json` 回执（何时 / 哪一份 / 结果 / 第 ① 步存下的那份快照）④走既有重启流程请求一次重启（插件自己绝不 kill 进程）。当前状态存不下来、或看门狗正持有回滚锁时直接拒绝（409），不会出现「还原了一半」。

### 现场

三次真机反馈说的是同一件事：**浮层说的不是真话**。先是重启被打断、备份早就结束了，「DSH 重启前备份中」却一直挂着不消失；修完这个，又出现备份做完后**整整 25 秒**界面（浮层和底部胶囊）一起说「正在重启…」而实际什么都没在重启——宿主把重启交给了 detached helper，helper 还在等自己的空闲复查，被拒之后才把阶段改回等待；再后来是「被打断之后我还有大活要干，一直悬浮很烦人」。

### 修复

- **阶段必须有去有回**：新增 `deferRestartStage()`，把「重启被推迟」的每一条路径都写成 `waiting`：闸门回收（又有会话忙）、detached helper 拒绝杀进程、重排重试、helper 调度失败；记录里带 `reason`（`deferred: conversation-active` 之类），事后能看出是推迟而不是在跑。放弃重启时一并清掉阶段。
- **`snapshotting` 只在真拷贝期间存在**：备份函数一返回（拷完 / 取消 / 抛错），阶段立刻离开 `snapshotting`——拷完就标 `restarting`，取消就清空，抛错就走推迟。以前从拷贝结束到真正执行重启之间那一整段（arm watchdog、写判定记录、调度 helper）都还挂着 `snapshotting`，一旦推迟就再也回不来。
- **`restarting` 只表示「即将 / 正在杀进程」**：备份一结束、标记它**之前**先当场复查一次空闲门，被挡就在同一次 tick 退回等待（`deferred: conversation-active after snapshot: …`），命令行不跑、watchdog 不 arm；进入 `restarting` 之后（等 helper / 等调度）**每 350ms** 复查一次，一有会话忙立刻降级回等待（`deferred: conversation-active while restarting`）并重新排上——几十秒的假 `restarting` 窗口没有了。
- **残留中间态不许跨进程继承**：启动时读到 `snapshotting` / `restarting` 一律改写——新进程起来是 `back`，同一进程里插件重载则是 `waiting`（`reason: boot: …`）。
- **同一次重启请求不重复备份**：快照是这次重启的回滚点，不因为重启要等待就作废。请求里记下本次已完成快照（`state.restart.snapshot`：请求时刻 + 目录 + 体积/文件数），重试时三个条件都满足就直接复用——**同一请求**、**目录还在**、**manifest 体积对得上**；任一不满足才重新拷贝。请求被取消 / 完成，标记随请求对象一起消失，下次重新备份。用户那次 205 MB 白拷一遍的事故不会再有。
- 新增 `restartPhase.reason`（状态路由与 health 简报都带）。

### 界面

- **被暂缓就说被暂缓，绝不说「正在重启」**：`waiting` 且 `reason` 以 `deferred:` 开头时，浮层文案是「**有新会话在跑，重启已暂缓**」+ 小字「等它结束会自动继续 · 已等 N 个会话」（英文 `A conversation just started — restart postponed` / `It will retry automatically when idle`）；渲染优先级最高，同一次渲染里阶段还写着 `restarting` 也直接画暂缓文案，旧词一帧不留。「正在重启…」只在真的进入杀进程阶段才出现。
- **暂缓卡片是通知，不是进度条**：显示 **4 秒**后自动收起（胶囊继续显示「待重启 · 等待 N 个会话」），新的暂缓（新的阶段时间戳）会再通知 4 秒；「备份中」「正在重启…」不受影响，活儿还在就一直显示。
- **陈旧保护**：`snapshotting` 必须 10 秒内有过更新（拷贝期间每个进度 tick 都刷新 `at`），任何中间阶段 15 秒内 `at` 没变就当过期，**直接不画**。
- **状态轮询跟着状态提速**：重启进行中（`pendingRestart` 且阶段是等待 / 备份中 / 正在重启）时，共享轮询从 2 秒临时降到 **500ms**，被新会话打断这件事一秒内就能反映到浮层；重启结束立刻恢复 2 秒。页面隐藏时不轮询，可见性恢复立刻补查一次；同一时刻只允许一个在途请求。

### 文档

- **npm 一句话描述换成新口径**（`package.json` 的 `description`）：原来只讲「等空闲→重启→续跑」，现在把「重启前快照 + 起不来自动还原 + 倒计时关机 + Windows 桌面 / 托管 dsh web（Windows / WSL / Linux）都可用」一起讲清；这句是 npm 搜索结果那一行，**必须随新版本发布才生效**。
- **README（英）/ docs/README.zh.md 补行为说明**：被打断时显示「重启已暂缓」而不是「正在重启」、暂缓卡片 4 秒后收起、阶段超过 15 秒无更新视为过期不再显示（胶囊仍显示等待数）。

### 验证

- `node --test plugins/dsh-autorestart/test/*.test.mjs` → **全绿**（细节见本次提交说明）。
- 宿主侧新增用例：拷完被拒的重启最终是 `waiting` 且 arm watchdog 那一刻已是 `restarting`；helper 门禁拒绝后阶段回到 `waiting`；另一进程残留的 `snapshotting` 不带进新进程；同进程重载残留的 `restarting` 被重置；备份完成后会话立刻变忙 → 同一次 tick 就是等待；`restarting` 期间会话变忙 → 守卫回调一触发即降级（复查周期断言落在 300–500ms）；备份完成 → 暂缓 → 重试**不产生第二个快照目录**且 `snapshotBytes` 不变；取消后重新请求 → 重新备份；快照目录被删 → 重新备份。
- 界面侧新增用例：15 秒 / 10 秒陈旧边界；`snapshotting` 15 秒无更新不渲染、3 秒内有更新正常渲染；`waiting` + `deferred:` 渲染「重启已暂缓」且不含「正在重启」（中英各一条）；真 `restarting` 仍「正在重启…」；降级后下一次渲染即改口；暂缓卡片 4 秒后收起、再暂缓再出现；运行中的卡片不会被收起；轮询 500ms / 2000ms 切换、隐藏页不发请求、慢响应单飞。
- 真机复现路径由主会话验证（打断一次重启，看浮层是否立刻改口、是否 4 秒后收起、重试是否不再拷一遍）。

## 0.8.4 — 2026-10-29

**只改文档与版本号，行为没有变化。**

### 文档

- **README（英）/ docs/README.zh.md 补齐 0.8.3 的真实界面行为**（npm 页面上原来还是 0.8.2 时代的旧描述）：
  - 重启阶段显示在**主界面居中浮层**（centered overlay card），**只排队等空闲时不出现**，只在真的备份 / 重启时出现，回来显示 1.5 秒后消失；
  - 胶囊只有**一句短话**（≤12 字），长句降级为 tooltip，详情在点开的面板里；
  - 备份进度是**真进度**（MB + 百分比），单位自适应（`92 KB` / `156 MB`），**备份快就一闪而过、不人为拉长**；
  - 设置改动有回执：保存成功后**设置在面板内部顶部**（面板自己的 sticky 条）显示绿色「已生效 / Saved」+ 时间，3 秒淡出；失败红色「没保存成功 / Not saved」并保留宿主给的原因；
  - 备份列表改成两行：`备份时间 / Backup time 2026-10-29 22:08`、`备份大小 / Backup size 156 MB（含已装插件 / plugins included）`，**不显示时区偏移**。
  - 槽位表补上 `shell.overlay` 里的重启阶段浮层，并说明保存回执渲染在设置面板内部（不占窗口级浮层）。

### 版本号

- `package.json` 与 `index.js` 的 `PLUGIN_VERSION_FALLBACK` 同步到 **0.8.4**，两份 README 的「当前版本」同步。

## 0.8.3 — 2026-10-29

**重启阶段搬到界面正中：不再挤在输入框那一行被截断，靠数字说话，也不是常驻。**

### 现场（真机截图）

阶段那行字挤在输入框工具行的小胶囊里（22px 高、一行宽）。窗口不宽时「正在等待所有会话空闲…（还有 1 个会话在忙）」被省略号吃掉，用户看不出卡在哪、还要不要等。另一次截图里浮层上的「等待会话空闲」挂了十分钟不消失——那笔重启只是在**排队等空闲**，其实什么动作都没在跑。

### 改

- **阶段改为主界面居中浮层**（`shell.overlay` 槽位，id `autorestart-restart-overlay`）：320px 固定宽、水平垂直居中、圆角、半透明，`pointer-events: none`——点哪里都照样点到下面的界面，不挡输入。
  - `snapshotting`：「DSH 重启前备份中」+ **真实进度条** + 「12.3 / 40 MB」+ 百分比（数字来自拷贝循环的实测字节，没测到就一个数字都不写）；
  - `restarting`：「正在重启…」，一直挂着，直到宿主真的退出；
  - `back`：「已回来」，**1.5 秒**后自动消失；
  - `waiting`：**浮层不出现**——只是排队等空闲，没有任何动作在跑，会话数交给胶囊去说；
  - state.json 里残留的旧阶段（`pendingRestart === false`）和页面的第一帧，都**不画**。
- **窄窗按字号缩放，不截断**：浮层里没有 `text-overflow`、没有省略号、不换行；窗口不够宽时用 `clamp()` 缩字号，数字永远完整可读。
- **底部胶囊恢复短句**（≤12 字、单行）：等空闲时「待重启 · 空闲后自动重启」/「待重启 · 等待 N 个会话」；备份中 / 重启中 / 回来时整行换成「重启前备份中」/「正在重启…」/「已回来」。长句只留 tooltip，细节全部交给浮层。
- **胶囊与面板的数字同源**：修掉「胶囊说还有 1 个会话、点开面板却说等 0 个任务」。两处现在读同一个 `blocking` 数字——Host 在 `restartPhase.blocking` 里单独报出它，不再只藏在句子中。
- **设置修改有回执**：改完设置，面板里给回执——成功是绿色「已生效」+ 时间；失败是红色并保留原因、不自动消失。
- **回执贴在设置面板内部顶部**（`position:sticky` + `top:0`，往下滚动设置内容也一直可见；条高 30px，覆盖不挤压表单），不再浮到窗口层——`shell.overlay` 上那条注册已删，提示只出现在本插件的设置页里，关掉设置页即清空。
- **口径统一**：悬停提示里的「任务」改成「会话」（英文 session(s)），和胶囊、面板保持一致。
- **体积按大小自动选单位**：一份 92 KB 的 profile（Web/WSL）如果按 MB 印就是「0 MB」甚至「0.0 MB」，等于把一次真的备份说成什么都没干。现在 `92 KB` / `156 MB` / `12.3 MB` / `0 B` 各按大小选单位，进度行两侧也各带单位（`12.3 MB / 40 MB`）。浮层**没有任何保底显示时长**：备份快就一闪而过，慢就一直在，出现与消失完全跟随真实阶段（用户拍板：「浮层不用保底时间，短就算了，不用硬加长」）。Host 侧 `restartPhase.snapshotBytes` 仍跨阶段记录真实体积，供界面与诊断使用。
- **说清是什么备份**：光看「正在备份」看不出备份的是什么，所以浮层改成「DSH 重启前备份中」、胶囊改成「重启前备份中」（英文 "Backing up before DSH restart" / "Backing up…"），进度条与 MB 数字不变。设置页与 tooltip 那句长句也一起改成同一个说法：「DSH 重启前备份中（预计 X 秒，已完成 Y MB）…」（英文 "Backing up before DSH restart (about Xs, Y MB done)…"），「慢就明说」那条也把主语补成「DSH 重启前备份比预期慢…」，全产品不再出现孤立的「正在备份」。

### 验证

- 单元测试 **760 → 801 项全绿**（新增 `test/restart-overlay.test.mjs` 19 条、`test/settings-save-notice.test.mjs`、`test/pill-count-source.test.mjs`）。
- 两个演练仍是 exit 0：`node scripts/drill-watchdog.mjs`、`powershell -File scripts/drill-rescue.ps1`。
- 客户端 bundle 仍是整文件一个 IIFE（`test/client-bundle-isolation.test.mjs` 守着）。

## 0.8.2 — 2026-10-29

**线上缺陷修复：宿主起来之后没有撤销看门狗，会把好环境回滚掉。**

### 事故现场（真机，19:19–19:21）

触发重启 → `watchdog-pending.json` 写入、`dsh-autorestart-watchdog` 计划任务注册成功、报告写 `armed`；新宿主 19:20:20 起来，health 连打 3 次都是 200；**但 `watchdog-ready.json` 从头到尾没出现**，`watchdog-pending.json` 还在、计划任务还在 `Ready`。当时是人工 `Unregister-ScheduledTask` 拆掉的——没人管的话，90 秒后它会还原快照并再拉起一个实例，**把一个健康的环境回滚掉**。

### 根因（已复现）

health 路由里那段"写 marker + 撤看门狗"的代码读的是 `stateDirOf()`——那是 runtime 工厂内部的闭包变量，**模块级函数根本看不见它**。所以每次请求都在第一行就抛 `ReferenceError: stateDirOf is not defined`，外面那个 `catch {}` 把异常吞了：路由照样回 200，marker 没写、pending 没清、计划任务没删，任何地方都没有痕迹。

- 复现方式：用测试上下文调真实的 health 路由，断言 marker 出现——旧代码失败（`ready written: false`）。
- 同源的第二个坑：`clearPending` / `readPending` 当时也没被 import，`armWatchdog` 注册失败的回滚分支同样会抛 `ReferenceError`。

### 修

- **health 路由不再靠闭包**：状态目录改由 `runtime.stateDir` 提供（`runtime` 上新增 `stateDir` / `pluginVersion`）。这类"路由看不见工厂内部变量"的错误从此没机会重演。
- **撤销拆成独立模块**（`lib/watchdog-disarm.js`），三件事分开做、都留痕：
  1. **先写 ready marker**（同步、read-back 校验）——它是唯一能阻止回滚的东西，绝不再依赖计划任务是否删成功；
  2. 清 `watchdog-pending.json`；
  3. 按 pending 自己写的 tier/taskName 删调度项（不再硬编码名字），删完**回查**（`schtasks /Query`）确认真的没了。
- **失败必须重试并留痕**：默认 3 次、退避 120ms/240ms；每次失败都带 `error.name` + `message`，写进 `watchdog-disarm.json`、health 响应、诊断文本（"报告一个问题"），不再静默。
- **开机就撤销，不等任何人来问**：`apply()` 里注册完路由立刻跑一次 disarm。即使一次 health 都没人打，宿主起来就会把看门狗撤掉；health 路由仍是第二道保险（后台清理，不拖慢响应）。
- **兜底（最要紧的一条）：看门狗回滚前必须自己问一次 health**。`runWatchdogFlow` 新增 3b 步：直接 HTTP 问 `127.0.0.1:<port>`（端口依次取实例记录 `access.json`、pending 里的 port、旧 `healthUrl`），**只要有一台在应答就绝不回滚**（`result: not-needed`）；一个端口都问不到时，额外再等一轮、复查 ready marker 与 pending，仍然没动静才允许回滚。
- **顺手修掉的版本号 bug**：runtime 里那份 `pluginVersion()` 读的是 `../package.json`（插件目录的上一层），永远返回 `unknown`；health 于是把 `unknown` / 硬编码常量当版本报出来。现在统一走模块级读取，`health.version` 是真正加载的版本。

### 演练

`node scripts/drill-watchdog.mjs` 从三个场景扩到**四个**，新增：

- **场景 ④「宿主起来了但没写 ready marker」**（就是这次事故）：假宿主只应答 health、绝不写 marker，并且**真实注册一个 Windows 计划任务**；断言 watchdog `result: not-needed`、`healthCheck: healthy`、**一次还原都没有**、pending 已消失、**计划任务真的被删掉**（`schtasks /Query` 查不到）。

### 重启阶段化 UI（同版发布：点下去 1 秒内就有反馈，备份有真实进度）

用户反馈："点『0 秒后重启』之后十几秒什么都不动，其实在备份 156MB，我会以为按钮没反应 / 0 秒是假的 / 有 bug。"

- **四个阶段立刻可见**：`waiting`「正在等待所有会话空闲…」→ `snapshotting`「正在备份配置和插件（预计 X 秒，已完成 Y MB）…」（0.8.3 起改为「DSH 重启前备份中（预计 X 秒，已完成 Y MB）…」）→ `restarting`「正在重启，稍后自动继续…」→ `back`「已回来，接着干」。阶段写在 checkpoint（`restartPhase`）里，点击的**同一次调用**就把 `waiting` 落盘并 persist，界面下一次轮询（2 秒一次，且点击后立即再拉一次）就能看到。
- **备份进度是真的**：`createBackup` 改成**文件级拷贝循环**（原来是 `fs.cpSync` 一次性拷完，既没进度也不能取消），边拷边报 `{ files, bytes, total }`，`total` 是拷之前量出来的真实总量；拷贝过程**每 120ms / 每 40 个文件让出一次事件循环**，所以取消请求能在拷贝途中被服务，进度也能在拷贝途中到界面。
- **备份阶段可取消**：取消后拷贝在下一个文件处停下，**半成品快照目录被删掉**（不留一个看着能还原的假备份），请求被撤回、宿主不重启；**进入 `restarting` 后取消被拒绝**（HTTP 409 + `reason: not-cancellable` + 原因），界面按钮置灰并说明"正在重启，已经不能取消了"。
- **两处都能读到**：`/__dsh_autorestart/health?state=1` 与 `/health` 都带 `restartPhase`（阶段、双语文字、可取消性、`slow`）和 `progress`（files/bytes/total/percent/ageMs）。
- **慢就明说**：备份超过 300 秒，或字节数 60 秒没动 → 显示「备份比预期慢（可能磁盘很忙），还在继续…」，绝不假装正常进度。
- **界面**：composer 那颗 pill 多一行阶段文字（含进度），设置页「重启设置」组标题下常驻一行同样的状态（pill 只在有待办重启时出现，设置页那行一直都在）。

### 验证

- 单元测试 **740 → 753 项全绿**（新增 `test/watchdog-disarm.test.mjs`：事故复现、开机自动撤销、marker 读写与 read-back、失败/重试/留痕、按 pending 选调度项、诊断文本、流程里"健康就不回滚"、问不到端口多等一轮）。
- 阶段化 UI 再加 **`test/restart-phase.test.mjs`（6 项，累计 760 项全绿）**：①点击后 1 秒内可读到 `phase='waiting'`（含 state 文件与 state 路由两处）②备份中 `progress.bytes` 单调增长且等于最终写入量 ③备份中取消 → 半成品目录消失、宿主没重启、请求被撤回 ④`restarting` 阶段取消被 409 拒绝并给出原因 ⑤慢拷贝两种文案 ⑥里程碑：健康拷贝报真实 MB 与预计秒数、没有测量前不报任何数字。
- 演练四场景 + 三档调度真机触发全部 exit 0。

## 0.8.1 — 2026-10-29

**修复打包遗漏**：0.8.0 的 npm 包按 `package.json` 的 `files` 白名单打包，而那份白名单只收了 `scripts/*.ps1` 与 `scripts/*.cmd`——**三个 POSIX 自救脚本（`restore-profile.sh` / `emergency-disable.sh` / `drill-rescue.sh`）、`scripts/README.md`、`scripts/rescue-strings.zh.json` 全都没进包**。Linux / WSL 用户装完 0.8.0 后，文档让他去双击/运行 `scripts/restore-profile.sh`，那个文件却不存在。

现在把白名单补齐（`.sh`、`.mjs`、`scripts/README.md`、`scripts/rescue-strings.zh.json`、`CHANGELOG.md`），并用 `npm pack --dry-run` 逐项确认：**54 → 61 个文件**，三个 `.sh` 都在。单元测试 740 项仍全绿。

0.8.0 的内容与行为没有其它变化；只是那个包缺文件。

## 0.8.0 — 2026-10-29

这一版把"出事之后怎么办"做成真正的闭环：**起不来就自动还原、再拉起、留下报告**，并且桌面端与各种 Web 托管端（Windows / Linux / WSL）都覆盖。

### 新增

- **看门狗（watchdog v2）**：重启前登记一个一次性监护者；新实例按约定报到就算过关，否则**先复查一次**（防误判），确认真的没起来才**自动还原重启前的快照 → 再自动拉起一次 → 把结果写进报告**。最多还原一次、拉起一次，绝不死循环；回滚前先探活，绝不双开。
- **三档调度，跨环境都可用**：Windows 一次性计划任务 → Linux/WSL 的 systemd-run → 自建后台进程（setsid nohup）。都没有时**明确告知"没有自动回滚"**，绝不假装有保护。
- **同一时刻只有一个监护者**：v2 可用时不启动旧的 v1；v2 不可用时才回落 v1；报告里记 arbiter 字段，出事能一眼看出当时是谁在监护。
- **POSIX 版自救包**：restore-profile.sh / emergency-disable.sh / drill-rescue.sh（与 Windows 的 .cmd/.ps1 同一套规则：先把坏的那份挪走留证、还原后回读校验、路径闸门、不自动重启）。
- **设置页「出事了怎么办」**：按平台显示对应的救命脚本绝对路径，可复制、可打开文件夹；Windows 还能一键在桌面放一个快捷方式（只有你点才创建）。
- **装上就告诉你有没有兜底**：第一次启用时真的建一个空计划任务验证能力（建 → 回读校验 → 删 → 再确认删掉），不能用就直接说清"会丢失：重启后起不来时不会自动恢复"。
- **平台能力矩阵**：docs/platform-matrix.md 列出 13 条能力 × 5 个平台，逐格标清能用、有前提（并写明用户会看到什么）与做不到。

### 修复

- **同一次重启出现两个看门狗会互相废掉**：旧的 PowerShell 看门狗只还原不拉起，若它先抢到锁，新的看门狗会放弃 → 结果是"配置回滚了却没有任何东西在运行"。已改成仲裁者，同一时刻只允许一个。
- **集成测试会往真实机器注册计划任务**（留下空壳任务）。测试改为注入，不再碰系统。
- 计划任务的触发时间曾写成 UTC，导致**任务会晚 8 小时才触发**；改为本地时间。
- 看门狗里一个忘记 await 的探活判断让 Promise 恒为真，看门狗每次都"放弃"；已修并加回归用例。

### 文档

- 讲清**关机倒数会关掉哪台机器**：Windows 桌面 / Windows web → 关这台 Windows；**WSL 里的 web → 关掉整台 Windows**（不是关 WSL）；容器里没有可靠的关机方式（界面会这么说）。
- 自救包补齐"Windows 用哪个、Linux/WSL 用哪个"，并写明 restore-profile 与 emergency-disable 的分工与选择口诀。
- 记录写 POSIX 脚本踩过的三个坑（dash 数单引号里的括号、双引号里的 sed 转义被吃、嵌套 JSON 平铺 grep 找不到）。

### 验证

- 单元测试 **740 项全绿**（node --test plugins/dsh-autorestart/test/*.test.mjs）。
- 看门狗演练（三档都真触发）+ Windows 自救演练 + **WSL 里的 POSIX 自救演练** 全部 exit 0。
- 全部脚本字节级纯 ASCII（rescue-strings.zh.json 无 BOM），机器上无残留计划任务。
- 未真关电：POSIX 的关机链路只验证到"计划层"（用户决定不为一条常识证据断开会话），矩阵里如实标注。

## 0.7.0 — 2026-10-29

这一版的主题是**认得出自己在什么环境里、并且永远不双开**，外加一个用户真能点到的问题反馈入口。
### 八、重启记录不再撒谎（2026-11-07）

**问题**：备份真做了，记录却说没做。gen 539 那一次，快照 319,549,069 字节、7.9 秒、`snapshot.taken=true`，
而同一份 verdict 里写着 `executionEntered: false`、`branch` 为空、`compareDifferences` 为空 ——
读这份记录的人只会得出一个结论：这次没备份。

**四处一起改**：

- **诊断可查**：每次重启的每个分支都写下 `branch` / `branchReason` / `branchTrail`（比对中、跳过、已备份、
  备份失败、被门延后、取消……），并把 `executionEntered` 与 `settledBy`（`main-flow` / `boot-recovery`）
  写进记录 —— 谁做的事、谁收的口，都写在纸上，不用再从 `attempts` 反推。
- **内容差异不再被丢**：`compareDifferences` 的白名单漏了 `kind: 'content'`（t34/t36 早就开始产出它），
  于是每一处**真实内容差异都被静默丢弃**，原因只剩一句泛泛的 `plugin-tree-differs`。已补上。
- **收尾不擦记录**：新实例起来收口时，不再重写主流程已经写下的事实，只补齐缺失字段并标记 `settledBy`；
  `branchGeneration` 也不再把这个空值伪造成 `0`。
- **轮询不停死 + 早退补快照**：`executeRestart` 的早退路径（无重启方式、异常）都会把轮询装回去，再也不会
  「门放行后没有人再执行」；而在任何一次尝试结束之前，若请求还没有快照，就先比对、按需备份，再结束
  ——「被门延后一次」不再等于「这次没备份」。

**真机读数（gen 540，修复后）**：`snapshot.taken=true`、**319,556,747 字节**、`executionEntered=true`、
`branch=changed-backed-up`、`branchGeneration=540`（不再是 0）、`settledBy=boot-recovery`、`result=ok`，
`compareDifferences` 首条点名到文件：
`{ path: "node_modules-link/dsh-autorestart/test/boot-verdict.test.mjs", kind: "added", live: { size: 5586 }, copy: null }`
—— 这正是这次重启真正多出来的那个文件。

**上一代反例（gen 539）**：同一台机器、同样做成了备份，记录却显示「没进入执行」。两代之间的差别就是上面四处。

