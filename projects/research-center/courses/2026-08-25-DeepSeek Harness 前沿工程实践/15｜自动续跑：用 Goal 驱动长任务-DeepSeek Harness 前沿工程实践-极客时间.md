DeepSeek Harness 前沿工程实践

张嘉熙

PayPal 高级软件工程师

2248 人已学习

查看详情

课程目录

已更新 16 讲/共 24 讲

开篇词 (1讲)



时长 12:06

基础篇：Cordis 运行机制 (4讲)



时长 08:27

时长 12:50

时长 11:47

时长 15:17

核心篇：能力、工具与会话 (8讲)



时长 15:26

时长 12:45

时长 19:31

时长 27:22

时长 22:06

时长 20:29

时长 20:01

时长 10:56

编排篇：从 Agent 循环到多 Agent 协作 (3讲)



时长 13:50

时长 10:29

时长 10:35

张嘉熙



00:00

1.0x **

讲述：张嘉熙AI版大小：12.10M时长：10:35

<audio title="15｜自动续跑：用 Goal 驱动长任务" src="https://res001.geekbang.org/media/tts_audio/20260930/tts-16460-25-1021151/ld/ld.m3u8"></audio>

你好，我是张嘉熙。

让一个 Agent 干一件要跑很多轮的活，比如把一整本书的错别字都改完，这个“要做什么”得一直记着不能丢，还得一轮一轮自动往下续跑，直到干完。

完成这类任务需要靠三个包：goal（目标状态服务）、goal-round-driver（续跑驱动器）、tool-goal（模型工具）。我们把它拆成三个问题：

怎么记目标状态？

怎么自动续跑？

怎么停下来？

答案就是：goal 管“记”，把目标状态作为事件写进会话日志；goal-round-driver 管“续”，idle 时自动排下一轮。至于“怎么停下来”，自然停有三种：续跑轮里模型通过 tool-goal 报 complete、blocked，或 goal-round-driver 用完上限（人也能主动 pause / clear）。

关于环境：本讲新增三个包：@deepseek-ai/dsh-goal（目标状态服务，ctx.goals）、@deepseek-ai/dsh-tool-goal（面向模型的 get\_goal / create\_goal / update\_goal 工具）、@deepseek-ai/dsh-goal-round-driver（续跑驱动器）。另有面向用户的 /goal 命令 @deepseek-ai/dsh-command-goal（输入 /goal 手动控制目标；和 tool-goal 一样，都是 ctx.goals 的门面），本讲不展开。npm install --legacy-peer-deps 装上即可。

关于示例：npm run start:ch15 用一个脚本假模型跑，先定义一个目标，模型第 1 轮只干活、第 2 轮调用 update\_goal 把目标标成完成，看驱动器和日志怎么记。不联网、不需要 API Key。

### 怎么记目标状态：goal 的持久状态

一个会话里最多有一个当前目标（不支持并行目标）。这个目标的状态是持久的：不是藏在内存里、进程一重启就丢的变量，而是记在会话日志里，具体方式是事件溯源（event sourcing），每次变更都追加一条 goal/change 事件（带变更后的完整状态），当前状态由这些事件回放出来，日志因此是唯一持久的真相来源。

这个完整状态（代码里叫 GoalView）有哪些字段：

| 字段 | 含义 |
| --- | --- |
| id / revision | 稳定标识 + 每次变更递增的版本（比较后写入用） |
| objective | 人类请求的完成目标，一段文字 |
| phase | 目标状态：active / paused / blocked / complete |
| roundsStarted / maxGoalRounds | 已准入的续跑轮次数 / 上限（不传默认 256） |
| blockedReason | 仅在 blocked 时存在（code + message） |
| activation | armed（启用）/ disarmed（停用）：进程本地的续跑开关 |

这些字段每被改一次，就追加一条 goal/change 事件。状态是这么一次一次记出来的。改它有七个操作：create、edit、pause、resume、complete、block、clear。我整理成了一张表格，你可以看一下。

| 操作 | 作用 | activation（续跑开关） |
| --- | --- | --- |
| create | 建一个目标（revision 1、phase active） | armed |
| edit | 改 objective / maxGoalRounds，phase 不变 | 不变 |
| pause / resume | 暂停 / 重新启用 | disarmed / armed |
| complete | 标记完成 | disarmed |
| block | 标记阻塞（带 code + message 原因） | disarmed |
| clear | 清除（留下删除标记） | disarmed |

把 phase 和这七个操作合起来看，goal 就是一台简单的状态机：phase 是目标所处的状态，操作是状态转移。phase 有四种：

| 状态 | 含义 | 出边 |
| --- | --- | --- |
| active | 正在跑 | pause → paused；block → blocked |
| paused | 暂停 | resume → active |
| blocked | 卡住（带原因） | resume → active |
| complete | 完成 | —（终点） |

另外，complete 操作能把任何未完成的状态（active / paused / blocked）直接标成完成。clear 则把当前目标整个清掉，只留一个删除标记（tombstone），清掉之后目标就没了，也就不属于任何一个 phase。

操作还有几条规则：

每次变更都带 GoalRef（就是 id + revision）做比较后写入：revision 对得上才写，对不上（陈旧引用）就被拒绝；

已有非 complete 的目标时，create 被拒；目标 complete 之后，就能 create 一个新的了。

resume 只在还有剩余轮次容量时才接受；目标已经 active 且 armed 时也被拒，resume 本就是把它变成 active + armed，它已经在了。

activation（armed / disarmed）是进程本地状态，不写进日志，goal/change 事件里只有目标的持久字段，没有它。所以会话恢复、分叉，或进程重启后，它都回到 disarmed：续跑不自动开，要由人明确 resume 才重新启用。这是刻意的安全设计：重启后环境（工作区、工具、provider）可能和崩溃前不一样，让模型在变了的环境里自动接着跑会出错，所以日志回放出的 active 目标不会自动续跑，得等人确认环境、明确 resume 才继续。

### 怎么自动续跑：goal-round-driver 排下一轮

goal-round-driver 是一个插件，职责就一件：等 Agent 干完回到 idle（ 第 13 讲 说的“闲”状态），自动把下一轮排进去，也就是开篇说的“续跑”。

它只靠监听 goal/changed（goal/change 落盘后发出的事件，不写日志，只用来通知监听者）和 idle 状态，只在每次 agent 回到 idle 时做一次判断：

phase 是 active、activation 是 armed、且 roundsStarted < maxGoalRounds → 预留 roundsStarted + 1，调 agent.followup 往队列（第 13 讲的 agent.inbox）里排一条续跑提示词。

这条续跑提示词会点明完整目标与 round / maxGoalRounds（比如 Round: 1/5），要求模型在标 complete 前给出证据、在尚未完成时保持目标 active。它还要求模型把当前工作区、工具结果、会话状态当作判断依据，而不是只凭一句目标描述。

具体来说，就是 Agent 回到 idle 时，goal-round-driver 自己干这件事。第 13 讲里，这一下要么靠应用代码调 followup、要么靠人发 steer，这里换成了插件自动。

示例里，驱动器自动续了这么一段：

第 1 次回到 idle：phase=active，roundsStarted=0

第 2 次回到 idle：phase=active，roundsStarted=1

第 3 次回到 idle：phase=complete，roundsStarted=2

第 1 次 idle 时目标刚建好、第一轮还没开始（0 / 5）；第 2 次是第 1 轮干完、驱动器自动排了第 2 轮；第 3 次是第 2 轮把目标标成 complete，驱动器随即停手。

roundsStarted 是“已准入”的轮次数：先排进队列只算预留，模型真的开始跑、进了日志才算数。

每一轮的边界（turn/start、turn/end）和 goal 变更（goal/change）都落在日志里：

\--- 会话日志里的 goal 与轮次事件 ---

seq 0 goal/change（create）

seq 2 turn/start

seq 5 user/message（goal，round 1）

seq 14 turn/end

seq 16 turn/start

seq 19 user/message（goal，round 2）

seq 26 goal/change（complete）

seq 39 turn/end

沿着 seq 读一遍：0 是 create 落盘的目标，2 到 14 是第一轮，16 起是第二轮，26 是第二轮里模型报 complete 落盘的目标，39 收尾。注意 goal/change 只在目标变更时出现，所以日志里就 create 和 complete 两条操作；中间那几轮目标没变，只是 turn 在推进，不会再产生 goal/change。

中间那两条 user/message（seq 5、19）就是 round-driver 排进来的 goal 消息。它虽然记录成 user/message，但来源要看 source，round-driver 是这样构造消息的：

createUserMessage({

content,

source: { kind: 'goal', goalId, revision, round }, \*// ← 来源是 goal，不是 user\*

})

kind: 'goal' 就是它和用户直接发的消息的区别（13 讲里用户消息是 kind: 'user'）；round 是轮次编号，所以日志里能看到 round 1、round 2。

### 怎么停下来：三种自然停

停这件事，主要靠模型报。模型操作目标，不直接调 ctx.goals，而是走 tool-goal 注册的三个工具：

| 工具 | 作用 |
| --- | --- |
| get\_goal() | 读当前目标，没有则返回 null |
| create\_goal(objective, max\_goal\_rounds?) | 建一个目标 |
| update\_goal(goal\_id, revision, action,...) | 改目标：edit / pause / resume / complete / blocked |

这三个工具都是 ctx.goals 的模型门面：get\_goal 内部就是调 ctx.goals.get，create\_goal 内部就是调 ctx.goals.create，update\_goal 的 action 参数对应 ctx.goals 的 edit / pause / resume / complete / block（工具里这个 action 叫 blocked）。

目标状态不会自动塞进模型上下文，模型要主动 get\_goal 读，才知道当前目标。

每个操作最后都落成一条 goal/change 事件。工具、操作、日志事件是一根链。但这些操作不是谁都能触发的，权限是有讲究的：

| 操作 | 谁能触发 |
| --- | --- |
| create / edit / pause / resume | 必须人类直接消息（source.kind 是 'user'；续跑轮的 'goal' 不算） |
| complete / blocked | 人类直接报，或自动续跑轮里由模型报 |

比如续跑轮里，模型想再建一个目标就会被拒：create 必须由人类直接发消息。

续跑轮里报 blocked 还有一道门槛：blockedAfterConsecutiveRounds（默认 3），roundsStarted 没到这个数，模型报阻塞就被拒，防止它一遇到困难就过早放弃。这些规则不是只写在文档里，系统提示词里就嵌了一段 goal 策略，明确告诉模型：update 前先 get 拿最新的 revision、resume / fork 后要重新 resume 恢复武装、只在目标真达成时才报 complete、同一个阻塞条件要连续撑过这么多轮才报 blocked、别为单轮的小活建 goal。

续跑自然停下来有三种，对应三种“干完了吗”的情况：

complete：模型判断目标真的达成了，update\_goal action complete。工具会顺势注入一段收尾提示，让模型在轮次结束前再对用户交代一次结果（人类直接报的 complete 不这样），这一轮随后收尾，示例就是这么停的。至于“真的达成了”由谁背书？就是模型自己，本层没有独立评估器，模型报 complete 即采信，评估器背书是留给别的策略层的。

blocked：模型连续多轮遇到同一个过不去的坎，报 blocked 并说明原因（日志里 code 记作 model-reported）。

用完上限：roundsStarted 到了 maxGoalRounds，驱动器直接把目标标成阻塞（code 记作 round-limit）。排下一轮失败（followup 抛错）时，驱动器也会标阻塞（code 记作 queue-failed），都是自然停，之后要人来 resume。

maxGoalRounds 只认轮次：不数 token、货币、挂钟时间或配额，就是给长任务一个“最多自己跑多少轮”的护栏。这个上限是 goal 这边另加的，第 13 讲的 AgentLoop 本身不设上限（跑完队列就回 idle）。

除了这三种自然停，人还能主动 pause（暂停，目标还在、能 resume）或 clear（清除，目标没了），这是人主动停，不是“干完”，刚刚我们提到过。

### 本讲小结

我们看清了：长任务的“自动续跑”拆成三件事：goal 负责记，goal-round-driver 负责续，tool-goal 让模型能操作目标。

goal 负责记：一个会话最多一个当前目标，事件溯源在日志里（每次 goal/change 带完整状态），phase 是 active / paused / blocked / complete，外加一个进程本地的 activation（armed / disarmed）。

goal-round-driver 负责续：每次 idle 检查一次，active + armed + 有容量就排下一轮续跑提示词。

怎么停？三种自然停：续跑轮里模型报 complete、blocked，或 driver 用完上限（人也能主动 pause / clear）。

这背后真正的变化是：续跑不再靠应用代码一次次调 followup，而是 goal 把目标持久记在日志里、driver 在 idle 自动排下一轮，重启也不丢。

这个“自动”有边界：maxGoalRounds 封顶轮次、blocked 让模型喊停、activation 不持久化让重启不自动续跑。三道阀兜住它不失控。

下一讲，我们让一个 Agent 把活委派给子 Agent：Subagent。

注： 本讲 GitHub 链接

### 思考题

动手实操：打开 goal-demo.ts，直接改代码、重跑 npm run start:ch15 验证。

把 maxGoalRounds 从 5 改成 1，重跑，看最终 phase 是 complete 还是 blocked，注意它跑到第几轮就停了。

把假模型里 if (this.calls === 2) 那段“报 complete”的分支删掉（或改成 if (false)），让它永远只干活、永不调 update\_goal；再把观察循环 for (let i = 0; i < 4; i++) 里的 4 调大（改成 7 左右，不然还没跑到上限就提前停了），重跑，看它自己跑几轮、最终停在哪个 phase。

欢迎把你的运行结果分享出来。如果你觉得这节课对你有帮助，也欢迎分享给其他朋友，我们下节课再见！

国庆假期（10 月 2 号、5 号、7 号）课程暂停更新，10 月 9 号恢复更新。祝大家国庆快乐、假期愉快，我们节后见！

公开

同步至部落

取消

完成

0/2000

直线

曲线

AI

2026-09-30给文章提建议

馨冉

Command + Enter 发表

0/2000字符

提交留言

大纲



固定大纲

怎么记目标状态：goal 的持久状态

怎么自动续跑：goal-round-driver 排下一轮

怎么停下来：三种自然停

本讲小结

思考题