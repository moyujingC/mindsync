<audio title="09｜渐进发现：信息的觅食循环" src="https://res001.geekbang.org/media/audio/c9/fa/c93b8e648dfce6da601160aa52e75cfa/ld/ld.m3u8"></audio>

你好，我是黄佳。

前两讲我们讲了上下文分诊和语义压缩。上下文分诊管哪些信息能进 context，语义压缩管已经进来的信息怎么压。但它们有一个共同前提：你已经知道相关信息在哪。

不过如果 Agent 面对的是一个陌生代码库、一份没看过的合同、一段很长的事故日志，不知道相关信息在哪，只能自己探索出来。由此我们引入渐进发现（Progressive Discovery）模式，感知模块的第三个模式。

如何快速而准确地分析遗留代码库，是一个高频问题，在技术群组讨论中经常遇到。

![](https://static001.geekbang.org/resource/image/99/be/994a1158fff42b1d723d0cc279790ebe.jpg?wh=864x383)

对大型遗留代码库进行准确的信息定位是个大问题

想解决图中的问题需要一套整体打法。比如做好知识工程、构建 AST 树、使用 RAG 等等。但在进入这些技术方案之前，我们先通过一个案例看看：遗留代码库到底难在哪里，渐进发现和这个问题有什么关系，以及为什么它能帮助 Agent 更好地理解老代码库。

比如说在一个电商系统中出现了 bug：订单确认邮件偶尔会混入其他客户的订单条目。开发团队接手时，面对的是一个 15000 文件的遗留代码库。文档稀疏，原作者走了，没人知道订单邮件 pipeline 具体走了哪些文件。

他们试了三种思路。

第一种，把整个代码库喂给 Agent 让它读。15000 个文件折下来大约 800K token，远超任何 LLM 窗口。切成 100 段并行喂的话，每段 Agent 都说“这一段没看到 bug”，因为它看不到全局。

第二种是 RAG。将整个代码库嵌入到向量数据库中，Agent 把 bug 描述发过去做语义检索。有些情况下召回的 top-K 文档里有太多的片段都跟订单邮件相关；有些情况下 top-K 文档里并没有出问题的代码，因为 bug 相关代码用的变量名是 merge\_user\_state，semantic 召回没有命中关键信息。因此纯用 RAG 效率不高，而且准确度差。

第三种，让 Agent 自己用 grep + read 探索。Agent 先 grep send.\*confirm，拿到 30 个候选文件名；再凭文件名挑出 5 个最可能的文件，mailers/order\_confirmed.rb 跳了出来；读完这 5 个文件后，它看到一条调用链：MailerWorker → Cache.get\_user → render；继续读 Cache.get\_user，发现 cache key 用了 order\_id，但没有用 customer\_id，bug 找到了。4 轮探索，约 18K token，用时 3 分钟。

![](https://static001.geekbang.org/resource/image/ae/73/ae0062be6bfayy28673611d328564d73.png?wh=1492x1054)

这个 bug 跟语义没关系，跟代码结构有关系。只有 grep + read + follow imports 这种直接接触结构的方式，才能把它找出来。

所以呢，我们这一讲要讲的，就是当你不知道相关信息在哪时，怎么定位它的工程细节。而且，这也是 2025-2026 年工业界争论很激烈的一个战场：Agentic Search vs RAG。开篇这个故事，就是这场辩论的一个小切片。

## 什么是渐进发现模式

渐进发现的模式的要义是，当 Agent 面对陌生信息空间（陌生代码库 / 文档库 / 陌数据源），通过广扫、聚焦、深挖三阶段循环定位自己所需要的信息。三轮循环具体是什么暂时不聊，后面再展开说。

在双轴图谱里渐进发现落在“感知 × 循环”的交点。认知功能上它是感知，决定 Agent 看到什么；执行拓扑上它是循环，一轮广扫 、一轮聚焦 、一轮深挖，每轮带着前一轮的发现去做下一轮决策。

这跟前两讲（分诊是 Router 单点路由、语义压缩是 Chain 三层级联）的本质区别是：它是迭代式的，不是单次完成的。

![](https://static001.geekbang.org/resource/image/f1/86/f10fd687155f7e89yye6f2a614f38886.jpg?wh=3500x2461) ![](https://static001.geekbang.org/resource/image/c9/5b/c96f61yyf4106cb3ebb770911ae0d35b.jpg?wh=4309x1937)

Anthropic 披露 2026 Q1 有 78% 的 Claude Code 会话涉及多文件编辑，而 2025 Q1 才 34%。这意味着 Agent 正越来越频繁地探索它不熟悉的区域。渐进发现模式适用于这类场景：Agent 接到任务，但不知道相关信息在哪。比如陌生代码库的 bug 调试、陌生客户的合同审阅、陌生事故的根因排查。具体渐进加载的信息可以是代码、文档、工具以及 Skills 等等。

当任务的相关信息已经被预先索引好，而且可以一次性传给 Agent，就不需要强行渐进发现模型。比如客服 Agent 接的是当前用户的工单上下文（已经在上下文分诊模式的 P1 里了）、研究 Agent 看的是用户上传的某份文档（已经在上下文分诊模式的 P0 里了）。这种场景下 Agent 不需要探索，因为它已经看到了。

## 工程现场切片

下面我挑两个貌似对立的工程切片来讲。

第一个是 Claude Code 为什么一度放弃 RAG，转向 Agentic Search；第二个是 Augment Code 为什么又走了持久化的索引（persistent indexing）路线。

这两个切片合起来，回答一个问题：面对陌生代码库，Agent 到底应该“先建索引”，还是“现场探索”？

### 切片一 Claude Code 的判断：代码探索优先 Agentic Search

Claude Code 早期用过 RAG + local vector db。

后来 Boris Cherny （Claude Code 创始人之一）公开在 X 上有这么一段表态：

Early versions of Claude Code used RAG + a local vector db, but we found pretty quickly that agentic search generally works better. It is also simpler and doesn’t have the same issues around security, privacy, staleness, and reliability.

再加上他在另一处说的：

Internal benchmarks showed that agentic search outperformed RAG by a lot, which was surprising.

意思就是，他们发现 Agentic Search 通常效果更好，而且更简单，也少了安全、隐私信息过期、和是否可靠这些问题。

为什么这么判断？其实只是因为 RAG + local vector db 多了一层长期存在的索引副本；这层副本会带来一整套额外工程问题。Agentic Search 少了这层，所以问题面小很多。

这些话反转了 2023-2024 整个行业关于 Agent Context 的常识。当时大家觉得“长 context 不够装就上 RAG” 是天经地义的，OpenAI、Pinecone、LangChain 整个生态都在这条路上。然后突然一个最常被用的 Coding Agent 跳出来说，这条路不对。

RAG 的典型链路是这样：

代码仓库 / 文档

→ chunk 切分

→ embedding

→ 写入 vector db

→ 查询时 top-K 召回

→ 塞进 prompt

这条链路里，vector db 变成了代码仓库之外的第二份知识副本。

Agentic Search 的链路更短：

当前任务

→ grep / search / read file / follow imports

→ 读当前工作区里的真实文件

它不是没有风险，而是少维护一份“影子仓库”。安全、隐私、过期、可靠性问题，大多就出在这份影子仓库上。

具体来说：

安全（Security）：RAG 要先把代码库嵌入到向量数据库（vector db）中。代码、配置、商业逻辑都多了一层暴露面。

过期（Staleness）：索引一旦建好就会过时。代码每天提交，索引就必须持续更新。索引慢一步，Agent 看到的就是旧代码。

可靠（Reliability）：RAG 召回依赖 embedding 模型、查询表达、top-K 和阈值。任何一个环节抖动，结果就会变。grep / read 虽然朴素，但稳定、可解释、可复现。

佳哥绝不想说 RAG 没用，而是代码探索不能只靠语义召回。代码库不同于普通文档库。bug 往往藏在变量名、调用链、缓存 key、配置文件、测试路径这些结构关系里。RAG 看的是语义相似，而 grep + read + follow imports 看的是代码结构。前者（RAG）可能召回一堆“语义相关”的文档，后者能顺着真实调用链往下追踪。

所以在中小型代码库里，如果目标是 bug 定位、调用链追踪、陌生模块理解，agentic search 往往更直接。先别急着上复杂 RAG，grep + read 应该能解决 70% 的探索问题。

### 切片二 Augment Code：超大代码库需要持久化的索引

但是我们也不能因为 Claude Code 这样说，就认定 grep + read 是渐进加载的全部内容了。Indexing 仍然有他的价值。

![](https://static001.geekbang.org/resource/image/50/5f/50f3041bc357537da4d00f1fdee6885f.jpg?wh=4039x1833)

Augment Code 把 Context Engine 做成一个工业级索引系统。它可以索引 400K+ 文件，支持较快的全量索引、增量更新和跨 repo 依赖追踪。后来它还把自己的 Context Engine 通过 MCP 暴露给 Claude Code 和 Cursor 使用。

这套索引要解决新鲜度和规模问题。

新鲜度方面，代码每天都在变，commit 一进来，索引如果跟不上，Agent 看到的就是旧代码。Augment 强调 45 秒增量更新，本质上是在告诉你：commit 之后不到一分钟，Agent 就能看到新的代码状态。

再看规模问题。一个 400K+ 文件的代码库，不能指望 Agent 每次都从零 grep。现场探索会变慢，交互体验会崩。持久化索引的价值，就是提前维护好大规模代码库的结构，让 Agent 查询时不需要每次扫整片森林，而是在一张实时更新的地图上探索。

所以 Augment 是在补足 Agentic Search 的边界：中小型代码库可以现场探索，超大规模、跨 repo、强依赖追踪的代码库，需要工业级 indexing 托底。Augment 处理的是另一个极端的情况：代码库非常大，跨 repo 依赖非常多，单靠 grep 一轮轮扫描，交互体验会变差。

这和 Boris 的判断并不冲突。Boris 说的是 “agentic search generally works better”，generally 这个词就意味着这个判断并不是绝对的。

一个 400K 文件的代码库，如果 Agent 每次都现场 grep，跑几轮探索就可能变成分钟级延迟。这个时候，持久化索引的价值就出来了：它把一部分探索成本提前支付掉，用实时增量和跨 repo 索引换取交互时的速度。

那什么时候选 Agentic Search、什么时候选代码库索引？下面给出一个辅助判断表格。

![](https://static001.geekbang.org/resource/image/41/87/41a74ab762e52c981c189fe94be56c87.jpg?wh=4353x2401)

## 三阶段循环：广扫、聚焦、深挖

Agentic search 真正落地时，绝对不能让 Agent 碰运气乱搜。它真正的工程骨架，是广扫、聚焦、深挖（forage-focus-deepen）三阶段循环。

![](https://static001.geekbang.org/resource/image/e4/2b/e40f0815c32eeed386ba39c65075af2b.jpg?wh=3449x2414)

三阶段循环 — Pirolli & Card 1999 信息觅食理论在 LLM Agent 上的复刻

下面看看，应该怎样组织三阶段循环。

第一阶段是广扫（Forage）。

Agent 用 grep / glob / find 这种低成本工具扫陌生空间。先拿到 30-50 个候选。这个阶段主要看文件名、路径、匹配行和周边上下文，不读完整文件。代价通常在几千 token 级别。

第二阶段是聚焦（Focus）。

Agent 从候选里挑 5-10 个最可能的文件完整读。这个阶段开始建立局部理解：谁调用谁，关键函数在哪里，哪个文件可能处在主路径上。开头案例里，mailers/order\_confirmed.rb 就是在这一阶段跳出来的。

第三阶段是深挖（Deepen）。

Agent 沿着 focus 阶段发现的可疑链继续追下去。比如读被调用函数、配置文件、测试用例、历史 commit。这个阶段不能再铺开，只追一两条最有信号的链。开头的案例里，追到 Cache.get\_user，发现 cache key 缺少 customer\_id，就是 deepen 的结果。

![](https://static001.geekbang.org/resource/image/d1/ca/d18831316e243a0f14a99df01c43bbca.jpg?wh=4449x2023)

左边的 12 个字段作为 DiscoveryTrace ，是渐进发现过程里的“行车记录仪”。Agent 每走一步探索，都要留下这类 trace：这一轮处在什么阶段、搜了什么 query、拿到多少候选、选中了几个、为什么选、花了多少 token 和成本、下一步准备进入哪个阶段。

比如图里这一轮：

phase = BROAD\_SEARCH

query = "k8s pod oom"

result\_count = 47

selected\_count = 5

next\_phase = FOCUS

意思是 Agent 现在还在广扫阶段，用低成本搜索拿到了 47 个候选，但只挑出 5 个进入下一阶段。它不是一看到结果就全读，而是在控制探索成本。

右边是 Pirolli & Card 信息觅食理论里可以借用的三个判断指标。

第一，information\_gain：单位成本拿到多少信息。一次 grep、glob、find 如果很便宜，却能暴露一批高相关候选，那 information gain 就高，值得继续扫。反过来，如果搜了很多次都只是噪声，就该换 query 或换方向。

第二，patch\_quality：当前信息区域值不值得继续挖。这里的 patch 可以理解成“信息斑块”，比如一个目录、一个模块、一组日志时间段、一个合同章节。聚焦阶段会判断：这批候选里，哪个 patch 的平均相关性最高？哪个最值得精读？所以 Agent 不再全局乱搜，而是开始收敛到少数高质量区域。

第三，marginal\_value：继续深挖的边际收益。Agent 沿着调用链、配置、测试、commit 往下追时，要不断问：继续读下去还赚钱吗？如果每多花 1000 token 都能拿到新线索，就继续 deepen；如果读到后面全是重复信息，边际收益下降，就该停止、回退，或者换一条链。

可以把三阶段循环和图对应起来：

Forage：用低成本工具广扫，追求 information\_gain

Focus：从候选里选高质量区域，判断 patch\_quality

Deepen：沿最强线索深追，观察 marginal\_value

最终，DiscoveryTrace 的作用就是把这个过程变成可观察的工程对象。 Agent 为什么从 47 个结果里只选 5 个？为什么从广扫切到精读？为什么继续追 pod-7c2，而不是换方向？这些都不应该只藏在模型的输出里，而应该落到 trace 里。

一个完整循环大约是 18K token。正常情况下，一轮就能解决大部分探索任务；信号不够时，再带着新发现的关键词回到 forage 广扫，开始第二轮。

这里要注意三个工程细节：

第一，给 agent atomic tools，不要只给一个 search\_codebase()。grep、glob、read 分开，Agent 才能自己组合探索路径。

第二，给循环设上限。比如最多 2-3 轮，单轮 20K token。找不到就交给人，不要让 Agent 无限烧 token。

第三，记录 trace。每轮用了哪些关键词、召回多少候选、读了哪些文件、最后追到哪里，都要记录下来。Discovery 的价值不只是最后答案，也包括中间证据链。

渐进发现的本质，是让 Agent 像信息觅食者一样，用最小探索成本找到最高信号区域；DiscoveryTrace 则负责记录每一次“为什么继续找、为什么换方向、为什么往下钻”。

![](https://static001.geekbang.org/resource/image/55/1f/558df6997970f05e6cc26466c927f11f.jpg?wh=4449x2464)

最后，还可以对上面的三个阶段进行补充，增加验证 Verify 部分。先把搜索面铺开，再把范围收窄，然后沿着最强线索钻下去，最后用反例和边界条件验证自己有没有找错。这样就形成了真正的闭环，从普通搜索的一次性追问，发展到有边界的探索：现在的信息增益还值不值得继续投入 token？

## 8 框架横切：每家是怎么做 Discovery 的

把主流 Agent 框架横向看一遍，会发现渐进发现这个模式是 Coding Agent 正在收敛出来的工程共识。

![](https://static001.geekbang.org/resource/image/71/07/7149a738643f039722bb7303985c3807.jpg?wh=4449x3618)

从这张横切表里，可以得到三个判断。

第一，Agentic Search 已经是 Coding Agent 的主流共识。代码里的关键信息经常藏在结构关系里，而非藏在语义相似度里。

第二，持久化索引是 Agentic Search 的规模化补丁。小中型代码库可以现场探索，超大代码库和跨 repo 场景需要提前维护一张代码地图。

第三，深挖时不应该污染主 Agent 的上下文。更成熟的做法，是把这个深入探索过程隔离出去：让 Sub-Agent 或独立 search worker 负责广扫和初筛，主 Agent 只拿回压缩后的发现、证据链和候选文件。这一点非常重要。长期运行的 Agent 最怕把探索过程中的中间垃圾全部塞进主上下文，最后真正有用的信息反而被淹没。

除去上面 8 家之外，Augment Code 走的是持久化的代码库索引（persistent indexing） 路线。它没有选择简单做一个 vector db，而是把代码库索引做成持续运行的上下文系统，支持大规模文件、增量更新、跨 repo 依赖和权限控制。

Cursor 则更像混合路线。短 session、局部修改、当前文件附近的问题，可以用 agentic search；跨 repo、跨模块、长期项目上下文，就需要索引托底。这其实是未来很多 Coding Agent 会采用的折中形态，能现场探索时现场探索，必须提前建图时提前建图。

不同框架的实现方式不同，但方向正在收敛。渐进发现的关键是一套纪律：用原子级别的工具探索，用代码索引控制规模，用 Sub-Agent 隔离噪声。

## 工业级实现：从骨架到生产

这一节的完整代码可以参考我们 代码库 中的具体实现。

渐进发现落到工程里，可以分成三层：最小骨架、业务装配、生产观测。

第一层是最小骨架。它回答的问题是：广扫、聚焦、深挖这三阶段，代码上怎么组织。最小骨架只需要五个核心对象。

Phase 表示当前阶段：FORAGE、FOCUS、DEEPEN。

Candidate 表示候选目标，比如一个文件、一条日志、一段 trace。它至少要包含 path、snippet、score 和 reason。

DiscoveryEvent 记录一次探索动作：用了什么关键词，输入多少候选，输出多少候选，读了多少文件，花了多少 token，用了多长时间。

DiscoverySession 记录一次完整探索：任务是什么，跑了几轮，最终读了哪些文件，是否成功，总 token 消耗是多少。

ProgressiveDiscoverer 是执行器，负责把 grep、read、scorer 三个 atomic tools 组合起来，跑完整的三阶段循环。

最关键的三条工程纪律如下。

第一，工具要 atomic，不要封装成一个 search\_codebase()。grep、glob、read、scorer 分开注入，Agent 才能自己决定先广扫、再精读、再深追。这样同一套骨架可以接本地文件系统，也可以接 MCP server，甚至可以接 Augment 这类 Context Engine。

第二，循环要有明确上限。比如 max\_cycles = 3。三轮还找不到，通常说明关键词错了、任务描述太泛，或者需要人介入，继续循环是白烧 token。

第三，单轮要有预算。比如 budget\_per\_cycle = 20K token。forage 阶段如果 grep 出太多个候选，必须立刻截断。

第二层是业务装配。它回答另一个问题，这套骨架放到真实业务里，应该加什么字段。

以运维事故响应 Agent 为例，接到告警后，Agent 先生成一个 IncidentContext：

incident\_id：事故编号。

severity：P0 / P1 / P2。

alert\_metric：latency\_p99、error\_rate、memory、cpu。

affected\_service：哪个服务报警。

timestamp\_iso：事故发生时间。

sla\_minutes\_remaining：距离 SLA 违约还有多久。

这些字段决定 Discovery 怎么跑。

如果 alert\_metric 是 latency\_p99，关键词可以从 timeout、slow query、circuit breaker、connection pool 开始。

如果 alert\_metric 是 error\_rate，关键词可以从 Exception、5xx、FAILED 开始。

如果 alert\_metric 是 memory，关键词可以从 OOM、memory leak、GC 开始。

这一步很重要。keyword 推导其实是领域知识沉淀。金融场景可能是 amount mismatch、FX rate、settlement failure；医疗场景可能是 abnormal vitals、contraindication；电商场景可能是 payment timeout、inventory mismatch、cart abandoned。

业务装配里还有一个关键动作，先做空间裁剪。运维日志每天可能有 10GB，不可能全量 grep。事故响应里最自然的裁剪方式是时间窗口，只看告警前后 15 分钟。合同审阅里可能按章节裁剪，研究综述里可能按论文类型裁剪，代码库里可能按目录或模块裁剪。先裁剪，再 forage，否则 token 很快爆掉。

业务装配的最终产物也不应该只是“答案”。更好的产物是一个 IncidentEvidence：

suspect\_logs：可疑日志。

suspect\_services：可疑服务。

recent\_deploys：最近部署。

config\_files：相关配置。

correlated\_traces：相关 trace。

即使 Agent 没有直接找到根因，这些证据对值班工程师也有用。生产里的 Agent 不一定要自己解决问题，更常见的价值是先把路探出来，再把人带到正确的位置。

第三层是生产观测。它回答最后一个问题：上线之后，怎么知道 Discovery 系统是不是健康。

我们可以看下面三个指标。

第一个是 cycles\_to\_success\_p50。它表示找到答案需要几轮。健康状态应该接近 1，也就是大多数任务一轮三阶段循环就能找到足够信号。如果 p50 涨到 2 或 3，通常说明 keyword 推导变差了，或者业务场景变了。

第二个是 forage\_to\_focus\_ratio。它表示广扫阶段 token / 聚焦阶段 token。健康区间大约是 0.3-0.5。太高，说明关键词太宽，forage 拿了太多无关候选。太低，说明关键词太窄，候选太少，聚焦阶段没有东西可读。

第三个是 zero\_signal\_rate。它表示三阶段跑完后，完全没有拿到有效信号的比例。健康线可以设在 5% 以下。这个指标突然升高，往往不是模型变笨了，而是基本工具操作出问题了：grep 没查到、read 权限错了、scorer 排序坏了，或者索引已经过时。

所以，渐进发现的生产实现不仅仅是一段“会搜索”的代码，而是一套小系统：前面有 atomic tools，负责接触真实世界；中间有三阶段循环，负责控制探索节奏；旁边有业务上下文，负责把搜索变成诊断；后面有 trace 和指标，负责让整个过程可观察、可调优。这才是完整的工业级 Discovery。

## Discovery 在生产里的常见卡点

这个模式在落地时，最常见的坑有四个。

第一个坑是 Forage 阶段关键词太宽\*。

第二个坑是 Focus 阶段挑错文件。

Forage 拿到 30 个候选，Focus 本来应该挑 top-8 精读。但 scorer 如果把测试文件排在生产文件前面，agent 就会读一堆 test/spec，真正的 services/auth.rb 反而没读到。

解法是给 scorer 加业务权重。生产文件优先于测试文件，核心目录优先于边缘目录，最近修改优先于长期没人碰的文件。

第三个坑是 Deepen 时追进死胡同。

Agent 看到一个依赖就一路追下去，最后追到第三方库源码，读了几百行也没有任何信号。解法是给 Deepen 设边界。不追第三方库，除非 bug 报告明确点名；不追超过 2 跳的依赖，A → B → C 之后就要停下来判断是否还有价值。

第四个坑是 Discovery 和 RAG 撞车。

同一个 Agent 同时跑 Discovery 和 RAG，RAG 召回一批文档，Discovery 又探出另一批文件。两边结果不一致时，Agent 不知道信谁。

解决办法是先定主路径而非简单的混用。小中型代码库、隐私敏感场景，优先 Discovery。超大代码库、跨 repo 强依赖场景，优先持久化索引。灰色地带可以混合，但必须定义清楚：什么时候用现场探索，什么时候查索引，冲突时谁优先。

## 总结一下

渐进发现的本质是会找路的 Agent。它是信息觅食理论在 LLM Agent 上的新形态。

Pirolli 和 Card 1999 年提出这个理论，讲的是人和动物怎么在复杂环境里寻找有价值的信息。觅食者不会把整片森林翻一遍，也不会闭着眼乱走。它会先找可能有食物的斑块，发现有价值就深挖，边际收益下降就换地方。

Agent 面对陌生代码库也是一样。它不知道 bug 在哪，不知道相关文件叫什么，不知道关键函数是什么。它不能全量读一遍，也不能靠猜一个文件名撞运气。它只能结构化地和未知互动：先用 grep / glob 这类低成本工具广扫，再从候选里挑少数文件精读，最后沿着调用链、依赖链、证据链深追。

这就是三阶段循环的本质。它追求“足够强的证据”，找到够用的线索，就停下来；信号不够，再换一组关键词继续探。这也是 Herbert Simon 讲的 satisficing：不是寻找理论上的最优解，而是在有限时间、有限 token、有限上下文里，找到一个足够好的解。

这个角度想通后，很多工程决策就顺了。

为什么要有 max\_cycles？因为探索不能无限循环。

为什么要有 token budget？因为 Discovery 的目标是有纪律地看（不是越多越好）。

为什么 atomic tools 比 search\_codebase() 更重要？因为 grep、glob、read 分开，Agent 才能根据上一轮发现重组下一轮动作。

为什么 agentic search 在很多代码探索任务里比 RAG 效果更好？因为它不假设索引已经覆盖一切，而是让 Agent 带着当前线索逐步逼近答案。

所以设计承担探索任务的 Agent 时，除了上下文窗口容量外，更要关注怎么强化它的探索能力，具体就是广扫的广度、聚焦的判断、深挖的克制。记住，Discovery 是侦探。给 Agent 原子工具，给它好的 keyword 推导，给它 satisficing 的纪律，比把整个代码库一股脑塞给它更重要。

希望大家都能写出会找路的 Agent。

## 思考题

1\. 观察一下你 Agent 的 keyword 推导逻辑，它是怎么把用户描述翻译成 grep 关键词的？描述越宽泛，越容易让它踩到广扫关键词太宽的坑。基于今天所学，你将如何调整你的描述？

提示：先故意给 Agent 一个泛化任务（“看看代码哪里有问题”），统计它的广扫阶段 token 消耗。然后给同一 Agent 一个精确任务（“看看 LoginController 的 timeout 处理”），对比两次的 token 消耗和信息获取质量。这些比较结果，能让我们直观感受到提示语和 Keyword 之间的关联。

2\. 算一下你团队代码库的规模 + commit 频率。你会考虑 Agentic Search、persistent indexing、还是混合？如果是混合，Discovery 触发条件怎么设？某些任务用 grep（隐私敏感）、某些任务用 indexing（跨 repo），怎么让 Agent 自己挑？

3\. 设计一个 Discovery + Memory 协同的场景。 Agent 这次解决了 bug，把 final\_files + 关键证据沉淀到 procedural memory。下次类似任务进来时怎么先查 memory？memory 命中和未命中分别走什么路径？

## 下一讲预告

下一讲我们学习感知模块的最后一个模式。我们将会探讨如何处理非文本的输入，比如一张架构图、一段服务运行 5 小时的日志（500MB）、一份 200 页的 PDF 合同。这些东西怎么进 Agent？

期待你在留言区和我交流互动，也推荐你把这节课分享给身边朋友。

公开

同步至部落

取消

完成

0/2000

直线

曲线

AI

2026-06-1011人觉得很赞给文章提建议

馨冉

Command + Enter 发表

0/2000字符

提交留言

大纲



固定大纲

什么是渐进发现模式

工程现场切片

切片一 Claude Code 的判断：代码探索优先 Agentic Search

切片二 Augment Code：超大代码库需要持久化的索引

三阶段循环：广扫、聚焦、深挖

8 框架横切：每家是怎么做 Discovery 的

工业级实现：从骨架到生产

Discovery 在生产里的常见卡点

总结一下

思考题

下一讲预告