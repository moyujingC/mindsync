<audio title="03｜双轴框架（下）：理解与使用 Agent 设计坐标系" src="https://res001.geekbang.org/media/audio/69/dd/69b6c428701edbdb93984cd4557cb5dd/ld/ld.m3u8"></audio>

你好，我是黄佳。

上节课，我们讲完了“双轴”：纵轴是认知功能，回答 Agent 在做什么；横轴是执行拓扑，回答能力、信息和错误在系统里如何流动。换句话说，纵轴七脉决定资源花在哪里，横轴六式决定错误沿什么路径传播。所以我们说：纵七脉定资源得失，横六式断错误路径。

那么为什么说双轴是“正交”的？今天，我们就进一步看清楚：为什么七脉和六式必须分开，为什么一个模式必须有“功能 × 拓扑”的唯一地址，以及为什么只有这样，双轴框架才不是一张分类图，而是一套可以选型、评审和演进 Agent 架构的工程工具。

## 为什么双轴必须正交呢？

所谓正交，意思是：纵轴和横轴各自回答不同问题，彼此不能互相替代。那么，为什么纵轴和横轴必须正交呢？答案其实也是这张图最关键的地方。

因为如果不正交，这张图就会退化成一个“分类表”，达不到“设计坐标系”的程度。

纵轴回答的是 Agent 在解决哪一类认知功能问题。关注点是功能性质，比如感知、记忆、推理、行动、反思、协作、治理。

横轴回答的是这些能力在系统里如何被组织和执行？关注点运行结构，比如链式、路由、并行、编排、层级、循环。

这两个问题必须分开。一个模式必须同时说明它解决哪一类认知功能问题，以及它采用哪一种执行拓扑。只说其中一边，都会漏掉工程关键信息。

因为同一个认知功能，换一种执行拓扑，工程后果会完全不同；同一种执行拓扑，放到不同认知功能里，含义也会完全不同。

先看同一认知功能，换拓扑后会发生什么。比如推理 × 链式：

def reasoning\_chain(question: str) -> str:

decomposition = llm("把问题拆成三个子问题：" + question)

answers = llm("依次回答这些子问题：" + decomposition)

final = llm("基于这些回答，给出最终答案：" + answers)

return final

这是串行推理。成本可预测，延迟可预测，适合流程清晰的问题。失败模式也很清晰，早期分解错了，后面都在错的框架里白费努力。

再看推理 × 循环：

def reasoning\_loop(question: str, max\_iter: int = 5) -> str:

answer = llm("先给出一个答案：" + question)

for \_ in range(max\_iter):

critique = llm("检查这个答案的问题，没问题输出 DONE：" + answer)

if "DONE" in critique:

break

answer = llm("根据批评修订答案：\\n答案：" + answer + "\\n批评：" + critique)

return answer

这也是推理，但行为完全不同。成本不固定，延迟不固定，有自我修正能力，也有过度反思风险。两个模式都属于 Reasoning，但它们的工程参数不一样：token 预算、等待时间、可观测性、停止条件、错误恢复路径都不一样。

反过来也成立。同一拓扑，放在不同认知功能里，含义也会变。

编排在推理里可能叫计划 - 执行（Plan-and-Execute）：中心节点拆任务，执行节点完成子任务。编排在治理里可能叫可观测性框架（Observability Harness）：中心节点收集 trace、日志、指标、告警。编排在协作里又可能接近管理者 - 工作者（manager-worker）：中心节点把任务分给专家。（目前我并没有把 manager-worker 作为一种单独模式提出，因为它可以被层级委派覆盖。）

如果你只说“我们用了编排者 - 工作者（Orchestrator-Workers）”，那其实我们分不出你说的是推理、协作还是治理。三者的错误模式完全不同：推理里的问题是任务拆错，协作里的问题是角色边界错，治理里的问题是观测信号遗漏。

这就是双轴的价值：认知功能决定问题类型，执行拓扑决定传播路径。

一个模式的完整名字应该是“功能 × 拓扑”。这样它才有唯一地址，也才有可讨论的工程后果（当然，佳哥是 Open 的，在未来，我们也有可能出现在一个功能 × 拓扑单元中，存在两种不同模式的情况，欢迎你抽象出新模式，为佳哥的模式宇宙做补充）。

## 42 格与 28 模式

现在，我们终于可以把七个认知功能和六种执行拓扑交叉起来，得到一个 7 × 6 = 42 格的矩阵。在佳哥当前版本的矩阵里，我已经放入了 28 个模式，留下了 14 个空格。

当前这 28 个模式需要满足两个准入条件。

第一，它必须已经在真实生产或准生产级系统中被使用过，而不只是论文里的概念。

第二，它必须有可命名的边界和可复用的骨架，能够在架构评审会上被讨论、被挑战、被实现。

![](https://static001.geekbang.org/resource/image/e4/8e/e4e3fb8f12e870a4e73e2646c287b18e.jpg?wh=3500x2461)

这里最容易被误解的是那些空格。空格是一种设计判断，不是因为没有想全。

有些空格在结构上并不成立。比如感知 × 层级。感知当然可以发生在多层系统中，但“感知”本身并不是一个层级委派问题。如果硬把它塞进去，很容易和协作 × 层级或治理× 层级混淆。

有些空格已经被其他格覆盖。比如反思 × 编排，很容易退化成生成批评的变体。除非它能够形成独立的工程骨架，否则没有必要为它单独占一个格子。

还有一些空格，可能代表未来的研究方向。比如记忆 × 并行，可以想象成多个 Memory Store 并行查询，然后再进行投票或仲裁。但目前它还没有形成稳定的 production 形态。框架应该给未来留下位置，但不能为了填满矩阵而制造伪模式。

所以，这张图的目标是追求可信度，不是覆盖率。GoF 23 种设计模式也不是一个被填满的数学矩阵。模式语言的价值在于每个名字背后都有真实经验、清晰边界和明确的失败模式，让表格看起来漂亮并不重要。

这也让矩阵成为一个字典，而不是一张术语列表。你查这张表是为了在设计时快速定位问题：

“这是记忆问题，还是治理问题？”

“它适合路由，还是循环？”

“如果它落在记忆 × 循环，那我应该去看失败日志（Failure Journals），而不是笼统地说加一个记忆模块。”

## Pattern Selection Card 模式选型卡

有了矩阵之后，下一步就是选型。给你一个业务需求，怎么在 10 分钟内选出第一版 Agent 架构？

我把它压缩成三步：做评估（ASSESS）、判拓扑（ROUTE）、查矩阵（SELECT）。

![](https://static001.geekbang.org/resource/image/9e/a0/9ebba2c7e8fe79be2849d4282254cea0.jpg?wh=4379x2351)

第一步，ASSESS，对七脉打分。也就是先判断这个 Agent 在七个认知功能上的需求强度：

Perception None / Light / Heavy

Memory None / Light / Heavy

Reasoning None / Light / Heavy

Action None / Light / Heavy

Reflection None / Light / Heavy

Collaboration None / Light / Heavy

Governance None / Light / Heavy

不要一上来就讨论用什么框架、几个 Agent、几个工具。先判断 Agent 系统的需求到底侧重在哪里。

第二步，ROUTE，判断主拓扑。

低协作 + 短任务 -> Chain / Route

中等复杂 + 多步骤 -> Orchestrate / Loop

多专家 + 宽任务 -> Parallel / Hierarchy

高风险动作 -> Governance Route / Chain / Hierarchy 优先

这一步是快速判断系统的主运行形态，不需要精确计算。它帮助我们避免一上来就把系统设计得过重，也避免在高风险场景下缺少治理边界。

第三步，SELECT，查矩阵。

每个 Heavy 功能，至少要选一个模式。第一版总模式数最好控制在 3 到 7 个之间。如果超过 7 个，就要优先合并或降级非关键功能。因为第一版架构的目标是找到最小可行的稳定组合，不是炫技、不是把所有模式都塞进去。

假如我们要从零开始构建一个代码评审 Agent ，可以快速走一遍这个模型选型方法。

首先，感知是 Heavy。它要读 diff、读相关文件、读测试、读项目规范，还要决定哪些文件不读。这里优先落到 Perception × Route，也就是上下文分诊（Context Triage）。

其次，记忆第一版可以是 Light。代码评审通常围绕一次 PR 展开，不一定需要跨月的长期记忆。但它至少需要 short-term state，记录已经看过哪些文件、哪些假设被证伪。这里可以先不引入复杂长期记忆。

第三，推理是 Heavy。它要判断 bug risk、设计风险、测试盲区、兼容性，而不只是摘要 diff。根据任务复杂度，可以落到推理 × 路由下的复杂度路由，也可以落到推理 × 链式样的结构化推理。

第四，行动可以选 Light 到 Medium。第一版如果只读文件、跑测试、不自动改代码，风险相对较低。但如果未来要自动提交 patch，就要升级到行动 × 编排的计划 - 执行模式 （Plan-and-Execute），并且叠加治理能力。

第五，反思是 Heavy。代码评审最怕 false positive。每一个 finding 都应该被 critic 检查：证据够不够，是否误读，是否真的可复现。这可以落到反思 × 链式的生成 - 批评（Generator-Critic），也可以进一步落到反思 × 循环的自愈循环（Self-Heal）。

第六，协作第一版可以是 Light。一个 Agent 能跑通，就不要急着上多智能体。但如果 PR 很大，安全、性能、测试三个方向需要分给不同专家智能体，那就进入并行或层级。

第七，治理第一版可以是 Light，但不能完全没有。即使 Agent 只读，也要 trace 它读过哪些文件、依据什么证据给出结论。如果它能写代码、发评论、触发 CI，就必须加审批门控（Approval Gate）。

于是，第一版 Argus 可以先选三个模式：

Context Triage

Structured Reasoning / Complexity Routing

Generator-Critic

这就是 60 秒从空白页到架构草图。它不完美，但它有方向。更重要的是，每个方向都有坐标、有失败模式，也有后续升级路径。

## 双轴评审法

然后，我们把双轴框架放进团队评审你的 Agent 设计，可以变成一套看起来简短，但很锋利的面试问题。

问题一：这个 Agent 的七脉状态是什么？感知、记忆、推理、行动、反思、协作、治理分别是 None、Light 还是 Heavy？不要先争技术方案，先澄清认知需求。

问题二：每个 Heavy 功能落在哪个拓扑？Heavy Reasoning 是链式还是循环？Heavy Governance 是路由还是层级？如果没人说得清，说明团队还没真正设计，只是在堆能力。

问题三：主要错误传播路径是什么？是链式级联、错误路由、并行合并、计划拆错、循环复合，还是层级泄漏？这个问题能直接带出测试策略。

问题四：哪些格子刻意留空？没做长期记忆是不是因为任务不需要，还是忘了？没做治理是不是因为只读低风险，还是因为 demo 心态？空格必须有理由。

问题五：从 v1 到 v2 的升级路径是什么？第一版用 Chain，未来是否要升级 Loop？第一版单 Agent，未来是否要并行专家 Agent （Parallel specialist）？第一版做只读，未来写操作是否要加审批门控？

这就是双轴的实际价值：它让评审从“感觉这个 Agent 不够稳”变成“推理 × 循环没有停止条件，治理 × 路由没有审批门，协作 × 层级没有子代理隔离”。

从模糊感觉不对劲，变成了具体的工程落地项。

## Compound Error 公理

最后我们说一下 Agent 系统最容易被低估的一件事，是错误会复合。

单步 95% 正确率听起来很高，但如果一个任务要连续跑 10 步，整体成功率大约是 0.95^10，也就是 60%。如果跑 20 步，就是 36%。这不是数学游戏，这是所有长链 Agent 的现实。

![](https://static001.geekbang.org/resource/image/07/73/07517e93970dfca163d80639831ff273.jpg?wh=3161x1206) 这张表解释了为什么 Anthropic 反复强调简单、可组合的模式（simple, composable patterns）。复杂不是免费午餐。每多一个节点，就多一个出错点；每多一轮循环，就多一次偏航机会；每多一个工具，就多一条误调用路径。

Compound Error 给双轴框架加了一个更硬的约束：选拓扑不是只看功能，还要看错误如何复合。

串行的错误沿链传播，所以要缩短链、强化中间 schema。路由的错误发生在入口，所以要把 classifier 做得可观测、可回退。并行的错误发生在合并，所以要设计 merge logic。编排的错误发生在拆解，所以要验证 plan。循环的错误发生在迭代，所以要有停止条件。层级的错误发生在边界，所以要做隔离和权限继承控制。

应对复合错误有四条路：

第一，减少步数。能一次可靠完成的，不要为了显得 Agentic 拆成十步。

第二，提高单步质量。上下文给准、工具描述写清、schema 约束明确，单步从 95% 到 99% 对长链收益巨大。

第三，加 verification。不要等最终结果才发现错，在中间状态就加入 Reflection 或外部 checker 挑错。

第四，fail fast。明显错了就停，不要带着脏状态继续生成。Agent 世界也需要 Circuit Breaker，只是跳闸对象从服务调用变成了推理轨迹。

后面我们探讨每个具体模式的时候，希望你能反复拷问自己同一个问题：这个模式到底是在减少步数、提高单步、增加校验，还是让系统更早失败？ 如果四个都不符合，它可能只是装饰。

## 总结

好的，今天的新内容就到这里。你要记住的是三层判断，而不是 28 个名字。

第一，Agent 设计模式的核心不是对象结构，而是有界资源在不确定性下的分配。纵轴认知功能告诉你资源花在哪里，横轴执行拓扑告诉你资源怎么流出去。

第二，七脉和六式必须同时看。只看七脉，会不知道实现形状；只看六式，会不知道服务目的。功能决定问题类型，拓扑决定错误传播路径。

第三，矩阵是工程工具，不是装饰图。它能帮你选型、评审、拆框架、解释空格、规划升级路径。28 模式是当前主矩阵。

具体说，双轴正交框架的工程价值在两件事：

第一件事，给每个模式唯一坐标。团队评审 Agent 时不用说“我们用了编排者 - 工作者”，这一句听到的人分不清是规划 - 执行（Reasoning × Orchestrate）还是层级委派 Hierarchical Delegation（Collaboration × Hierarchy）。两个坐标合起来才是唯一地址。

第二件事， 给设计决策提供反向。查“记忆 × 循环”那一格有什么模式，比从零想“怎么做记忆”快 100 倍。矩阵是导航工具，不只是词典和列表。

本节最后，我们把这张模式图放回更大的历史里。

Christopher Alexander 讲 pattern language 时，真正重要的是一套共同语言，而不是某一个建筑模式。

GoF 对软件工程的贡献，是让工程师可以用 Singleton、Factory、Observer 这些词快速对齐设计讨论，比 23 个模式本身更深远。

Agent 时代也需要这样的共同语言。现在行业里已经有很多词：agent、workflow、tool use、memory、planner、critic、guardrail、handoff、subagent、swarm。

![](https://static001.geekbang.org/resource/image/bd/12/bd67426129f49cb3afd2d667d90f8b12.jpg?wh=4449x3893)

问题是，这些词常常不在同一层。

有人用 Agent 指自主系统，有人用 Agent 指一个 LLM wrapper。

有人用 guardrail 指输入审查，有人用它指全链路安全策略。

有人说 Memory，可能指对话历史，也可能指向量检索，也可能指长期用户画像。

所以，双轴框架的目的是给已有名词定坐标，不是为了发明一堆新名词。它的原创性不在于 Perception、Memory、Chain、Loop 这些词本身, 这些词都有来源。真正的贡献在于，把认知功能和执行拓扑正交组织起来，让一个模式可以被唯一定位，让空格可以被解释，让新模式可以被放进同一张图里讨论。

也就是说，双轴框架在说“我们终于有了一张白板”，不是在说“我有一套分类”。

工程共同语言最重要的价值是让大家吵得更准，而不是让大家背得一样。你可以不同意某个模式的落格，可以挑战它是否应该移位，可以考虑某个空格是否该填，也可以把你抽象出来的新模式填入那些空白格子。

但讨论终于有了坐标，而不是继续在模糊描述里互相猜来猜去。到这里，双轴正交框架产生过程、具体样子和用法都呈现在你眼前了，非常期待你在留言区和我一起继续讨论！

## 思考题

拿你正在做的 Agent，把七脉分别打成 None / Light / Heavy。哪一脉最被低估？

找一个你们团队说过的工作流或多模态设计，把它拆成双轴坐标。它到底是 Reasoning × Orchestrate，还是 Collaboration × Hierarchy？

选一个 Loop 型设计，写出它的停止条件。如果写不出来，这个 Loop 很可能还不能上线。

从矩阵里找一个空格，判断它是结构性不成立、可以被其他格覆盖，还是未来研究方向。

期待你在留言区和我多多交流讨论，也推荐你和身边的朋友探讨双轴理论。

## 下一讲预告

如果第 1 讲解决的是为什么旧模式不够了，我们的 2、3 讲解决的就是新模式怎么站起来。矩阵到这里在概念层已经搭起来了，但还没经过工业代码的检验。

下一讲我会把它放到 8 个开源 Agent 框架的源码上做一次实证：Claude Code、Codex CLI、Aider、OpenCode、OpenClaw、Hermes、DeerFlow、OpenHands。每个框架都逐格对照一遍，实际占用哪些格、留空哪些格、与本讲提出的分类是否一致。

完成这一轮对照之后，你也会对这个框架有更深的认识，这样我们再展开每一个具体模式时，学习效果也会更好。

## 参考资料

双轴论文， A Two-Dimensional Framework for AI Agent Design Patterns: Cognitive Function × Execution Topology

设计 AI Agents, Designing AI Agents, Manning

Anthropic, Building Effective Agents

Anthropic, Claude Code Subagents

Anthropic， Disrupting the first reported AI-orchestrated cyber espionage campaign

Google， Agent Development Kit Technical Overview

Google， ADK Sequential agents

OpenAI， Agents SDK Handoffs

OpenAI， Agents SDK Guardrails

OpenAI， Agents SDK Tracing

LangChain， LangGraph Send / conditional edge API

Shinn et al.， Reflexion: Language Agents with Verbal Reinforcement Learning

Sumers et al.， Cognitive Architectures for Language Agents

公开

同步至部落

取消

完成

0/2000

直线

曲线

AI

2026-05-2626人觉得很赞给文章提建议

馨冉

Command + Enter 发表

0/2000字符

提交留言

大纲



固定大纲

为什么双轴必须正交呢？

42 格与 28 模式

Pattern Selection Card 模式选型卡

双轴评审法

Compound Error 公理

总结

思考题

下一讲预告

参考资料