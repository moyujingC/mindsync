DeepSeek Harness 前沿工程实践

张嘉熙

PayPal 高级软件工程师

1592 人已学习

查看详情

课程目录

已更新 9 讲/共 24 讲

开篇词 (1讲)



时长 12:06

基础篇：Cordis 运行机制 (4讲)



时长 08:27

时长 12:50

时长 11:47

时长 15:17

核心篇：能力、工具与会话 (4讲)



时长 15:26

时长 12:45

时长 19:31

时长 27:25

张嘉熙



00:00

1.0x **

讲述：张嘉熙AI版大小：31.37M时长：27:25

<audio title="08｜会话日志：AppendOnly Log 与 Projection" src="https://res001.geekbang.org/media/tts_audio/20260911/tts-16239-25-1015492/ld/ld.m3u8"></audio>

你好，我是张嘉熙。

前面几讲我们盯的都是一次调用，工具调用怎么走流水线、被守卫拒绝、被沙箱约束能碰哪些文件，Code Mode 里的子调用也一样。但一个真实任务往往要在模型与工具之间来回几十趟，模型说一句、调个工具、看看结果、再说一句……这些来回攒下的状态，存在哪儿？

dsh 的回答很朴素：一份只追加的日志（Append-Only Log）。这些来回，都发生在同一个会话里：会话里每发生一件事就记一条，一个会话一份这样的事件流——这就是会话日志。

还有一层容易被忽略的设计选择：发给模型的那段消息历史，不是另外存的一份数据，而是从这份日志算出来的，本讲管从日志算出来的东西叫投影（Projection）。它自己不落库，所以压根不存在副本跟真身对不上这回事：日志一变，它就跟着变。想让它变，只能往日志里再追加一条；想重放，就是把这份日志从头再算一遍。

本讲分五节：

日志长什么样；

日志凭什么可信；

第一个投影：消息历史；

投影怎么写；

投影不必每次从头算。

前两节说日志这个因，后三节说从它算出的果。

关于环境：本讲新增一个包 @deepseek-ai/dsh-session-projection（投影机制的定义与框架驱动），已加入本项目的 package.json，npm install --legacy-peer-deps 装上即可。

关于示例：npm run start:ch08 跑日志，npm run start:ch08:projection 跑投影。

### 日志：一串只能追加的事件

一次会话（Session）就是一份仅追加日志：由一串带类型的事件（SessionEvent）组成，是这次会话全部交互历史的唯一真源——要查发生过什么，只认这一份，别处没有第二份。（官方的说法是“agent 完整交互历史的唯一真源”，那是对正在跑的那个 agent 而言：它打开的就是这一个会话。）

先看它长什么样，跑 npm run start:ch08，第一段是记完一次最简交互之后的日志（顶格那句小结是程序打的总结，不属于日志）：

\--- ① 日志：一条条追加，seq 连号 ---

seq 0 turn/start

seq 1 step/start

seq 2 user/message

seq 3 assistant/message

seq 4 tool/call

seq 5 tool/result

seq 6 step/end

seq 7 turn/end

小结：日志里现在有 8 条事件，下一条的 seq 将是 8

先看这一串：号是连着的。 8 条事件，seq 从 0 到 7，一个挨一个，它等于这条事件被追加那一刻日志里已有的条数。连号不是装饰，是契约：读回来只要发现中间缺了一个，比如 0、1、2、4，就知道这段日志不完整，不会把它当完整历史接着用。所以事件一旦写下就抽不掉：抽一条，号就断了。

再看一条事件里面有什么。 上面只打了类型；我们用程序把 seq 2 这条原样打出来：

{"type": "user/message","seq": 2,"time": 1788744295522,"data": {"content": \[{"type": "text","text": "现在几点了？"}\],"source": {"kind": "user"},"role": "user","id": "ab3cfb33-aa5a-4eeb-a153-b77f69f1442f"},"surfaceOp": "append"}

一条事件必有这四个字段：

type：它的种类

seq：它在会话内的序号，等于被追加那一刻日志里已有的条数

time：追加那一刻的毫秒时间戳，每次运行都不同

data：这件事的载荷，里面的 id 是框架给每条消息生成的身份，每次运行都不一样

尾巴上还多一个 surfaceOp，这条事件进不进模型视野，就看它。注意，它是条件必填，不是可带可不带：进得了 surface 的那几种类型，追加时必须声明自己怎么进，不声明就报错；进不了的类型不许带，带了一样报错。第三节专门讲。

官方把事件的这层结构叫信封（envelope）：type、seq、time 是信封上写的信息，两个可选字段 surfaceOp（第三节讲）、ignorable（第二节讲）也是；data 是装在信封里的信。这个分法下面第二节要用。

另外，data 的形状由事件类型说了算，没有统一格式。同样是消息类事件，两种骨架摆在一起看：

\*// user/message：消息本身就是 data\*data: { content, source, role, id }

\*// assistant/message：消息装进 message，外面另带 turn 和 step\*data: { turn, step, message: { content, source, role, id } }

一个把消息摊平摆在 data 上，另一个把消息装进盒子、外面再贴两个标签。

接着看几条事件怎么串起来：turn 套 step。日志本身是平的，8 条事件平铺一列，没有任何嵌套。但按 turn/\*、step/\* 这几条标记事件的起止去读，层次就出来了：

turn/start seq 0 一轮开始

step/start seq 1 一次模型调用开始

user/message seq 2

assistant/message seq 3

tool/call seq 4

tool/result seq 5

step/end seq 6

turn/end seq 7 一轮结束

一个 turn 是一轮对话，一个 step 是一次模型调用 + 它要求的那些工具执行。示例里模型调一次就答完了，所以只有一个 step；如果它看完工具结果还想再想一步，同一轮里就会接着出现 step 2、step 3，一个 turn 里可以有多个 step（step/\*、tool/call 这些事件的 data 里都带着 turn 和 step 两个编号，就是为这个）。

还有一点：tool/call 和 tool/result 是两条独立事件，模型要求调用和调用完了，在日志里分得清清楚楚。反过来也成立，一个 turn 也可能一个 step 都没有：官方明确说，没进过 step 的 turn 不会留下 step/start、step/end，比如这轮在进模型之前就结束了。所以 turn 和 step 是两层各自独立的编号，不是一轮必然配一步。

最后看事件分哪些种类。 整理成一张表（官方自带四十多种，这里只列必需的十种）。先交代最后一列，进 surface：日志记了很多事，可模型不是全都能看见，surface（本义：表面）就是模型看得见的那一层。标是的只有三种，原因第三节从模型的视角交代：

| 事件 | 记的是什么 | 进 surface |
| --- | --- | --- |
| turn/start / turn/end | 一轮的起止，以及结束原因 | 否 |
| step/start / step/end | 一次模型调用及其工具执行的起止 | 否 |
| user/message | 用户说的话。三种都记在这儿：人说的一句、agent.inject() 补进来的上下文（文件变更通知、子目录 AGENTS.md、技能内容、定时通知……）、目标续接的一轮——三者原样投影，靠 source 区分 | 是 |
| assistant/chunk | 原始流式分片，一个分片一条，为的是 token 级的回放保真 | 否 |
| assistant/message | 一个 step 组装好的模型消息——派生历史用的就是它，不是上面那些分片；适配器上报了用量才带 usage | 是 |
| tool/call | 模型要求的一次调用（原始参数字符串） | 否 |
| tool/result | 一次调用的模型可见结果 | 是 |
| request/header | 发给模型的请求快照 | 否 |

表格里有一行值得多看一眼：request/header。模型每次开口前，程序都得给它配好一套设定——用哪个模型、什么参数、提示词写的什么、给哪些工具。消息历史记的是说了什么，这套设定则是在什么条件下说的，它不在对话里，却决定模型怎么答。request/header 就是把这套设定拍张快照存进日志：过后想知道当时给它看了什么，翻日志即是原文。而且不是每次请求都拍，跑起来先拍一张，之后设定变了才追加下一张。

第 05 讲说过，模型眼里的工具只有 name/description/parameters 三样，当时那三样长什么样也照在这张快照里。

顺带提一嘴，这本账记在什么纸上是可换的：dsh-session 自己只认那一串事件，落在哪里是另一层的事。官方就给了两种后端，JSONL 存成一份文本文件，SQLite 每个事件存一行；行字段与事件 1:1 映射，所以没有需要保持同步的并行持久化 schema，换的是摆法，不是账。怎么落盘不在这一讲的范围。

最后，回头看只能追加这四个字。为什么不允许涂改？因为下面三件事，全都压在同一个前提上——写下的就改不动：

崩溃之后接着跑。 进程随时会死，重启后要接着干，得先答两个问题：断在哪一条、哪些是真的。只追加的日志答案很干脆，就是最后那一条。它要么是完整写下的，要么压根不在日志里，不存在“写了一半被覆盖”这种中间状态（官方专门有一节叫“崩溃恢复保留被中断的轮次”）。

同一份会话在几处同时打开。 几方看同一段历史，得有唯一一份说了算。只追加就没有“谁的版本更新”这个问题：差异只可能是尾巴长短，长的一方更新。

事后追责与复盘。 要能证明这段历史没被人动过。只追加天然满足——任何改动都只能表现为新增，而新增本身又是账上明明白白的一条。

而只追加是这个前提最经典的实现：任何一条都改不了，于是这本账永远只有一个出处。至于从它能算出多少种视图，那是第四节的事，真源只有一份，视图随便多少份。

回头看这一节看过的四件事：一串事件、一条事件里的四个字段、turn 套 step 的层次、以及十种事件类型——这是日志的形。

形看完了。可形只是它长什么样，它凭什么当得起唯一真源这四个字？

### 日志的底线：三条硬约束

既然是唯一真源，就容不得半点含糊：它得保证你读回来的，就是当时写下的那本。下面这两段输出演的就是它——start:ch08 里的第 ②、③ 段：

\--- ② 塞一个无法无损序列化的值 ---

被拒：session event "turn/start" carries non-JSON-serializable data

\--- ③ 试着改一下已经写下的历史 ---

Object.isFrozen(events\[0\]) = true

Object.isFrozen(events\[0\].data) = true

events\[0\].data.turn = 99 → TypeError: Cannot assign to read only property 'turn' of object '#\<object>'

events\[0\].data.turn 仍然是 1\<p>三条硬约束，前两条恰好被这两段输出演出来了：\</p>\<ol>\<li>\<p data-number="1">\<strong>追加时校验，坏数据在入口就被拒。\</strong>\</p>\</li>\</ol>\<p>事件数据必须是无损 JSON：\<code>BigInt\</code>、函数、\<code>symbol\</code>、\<code>undefined\</code>、\<code>NaN\</code>/\<code>Infinity\</code>、\<code>-0\</code>、循环引用、稀疏数组、\<code>Map\</code>/\<code>Set\</code>/\<code>Date\</code>/ 类实例……统统不行。为什么偏偏卡在 \<code>append\</code> 这一行？三个理由，一个比一个硬：\</p>\<ul>\<li>\<p data-indent-1="">\<code>append\</code> 承诺的是已经落盘。官方对后端的要求是 append resolves only after durability——它返回成功，就意味着东西已经写下去了。若放一个存不下的值进日志，就会出现一条内存里算数、磁盘上没有的事件，这个承诺当场就破了。\</p>\</li>\<li>\<p data-indent-1="">内存里的日志，恒等于磁盘上能存下的东西。 官方的说法是：错误事件绝不会进入日志，因此 \<code>session.events\</code> 始终与后端可持久化的内容一致。于是你眼前那串事件，就是能原样存下来的那一串，不存在看着在、其实存不下这种事。\</p>\</li>\<li>\<p data-indent-1="">还原不靠猜。有人会说：\<code>Date\</code> 变成字符串再变回 \<code>Date\</code>，也不是做不到。确实做得到，但那要求读的人知道这个字段原本是 \<code>Date\</code>。事件类型由插件扩展、还会跨版本演进，这份哪个字段原本是什么类型的表既没处放、又会漂移。dsh 的选择是不猜：宁可在入口拒掉，也不在重建时猜（这个取向本节还会再遇到一次）。\</p>\</li>\</ul>\<p>所以宁可在 \<code>append\</code> 这一行就炸掉，绝不让存不下的值溜进日志。\</p>\<ol start="2">\<li>\<p data-number="2">\<strong>进日志即冻结。\</strong>\</p>\</li>\</ol>\<p>事件和它嵌套的数据在通过校验时就被深冻结了，输出里连查两层 \<code>isFrozen\</code>，连 \<code>data\</code> 里嵌的对象也没放过。所以那句赋值直接抛 \<code>TypeError\</code>：\<code>turn\</code> 还是 1。历史一旦写下就改不动，这正是唯一真源该有的样子。\</p>\<ol start="3">\<li>\<p data-number="3">\<strong>读不懂的事件，默认不许跳过。\</strong>\</p>\</li>\</ol>\<p>这条不在 \<code>data\</code> 里，而是写在信封上，所以两段输出里也看不见它。\</p>\<p>先说清一个动作：日志要落盘，落盘之后还得读回来，把磁盘上那串事件一条条装回内存、重新冻结、重新派生出消息历史，这个动作叫重建（官方叫 load，崩溃之后就是靠它接着跑）。麻烦出在重建的时候：插件可以往日志里加自己的事件类型，于是读的那一方，常常是个更旧的版本，可能撞上一个它根本没见过的类型。怎么办？\</p>\<p>dsh 的答案是默认拒绝。事件可以带一个 \<code>ignorable\</code> 标记；不带这个标记的事件，读的那一方遇到不认识的类型时必须拒绝重建整个会话，宁可一个字都读不出来，也不许悄悄把那一条丢掉，因为一条你读不懂的事件，很可能改变后面所有事件的解释方式：少一条，后面的账全跟着错。\</p>\<p>这个标记长什么样？ 它的类型写死成 \<code>ignorable?: true\</code>，要么不写，要么写 \<code>true\</code>，没有 \<code>false\</code> 这一档。这不是偷懒：类型上就不给你写 \<code>false\</code> 的机会，免得冒出写了 \<code>false\</code> 却自以为是默认值的糊涂账；想说这条可以丢，只能明明白白写一个 \<code>true\</code>。官方还补了一道限制：只有纯信息性的记录才配标它，丢了也不影响重建的那种。\</p>\<p>于是默认值就是\<strong>不写 = 必需\</strong>。为什么定在这一头？因为写事件的人迟早会忘，而官方把这笔账算得很清楚：\</p>\<div data-component="table">\<table style="border-collapse: collapse; width: 100%; line-height: 1.75; margin: 0 0 10px 0">\<thead>\<tr style="background-color: rgba(241, 241, 241, 0.7)">\<th style="border: 1px solid #ddd; padding: 8px 12px; vertical-align: top; background-color: rgba(241, 241, 241, 0.7)">\<p style="margin: 0; line-height: 1.6; white-space: pre-wrap; display: block">忘了标记时\</p>\</th>\<th style="border: 1px solid #ddd; padding: 8px 12px; vertical-align: top; background-color: rgba(241, 241, 241, 0.7)">\<p style="margin: 0; line-height: 1.6; white-space: pre-wrap; display: block">后果\</p>\</th>\<th style="border: 1px solid #ddd; padding: 8px 12px; vertical-align: top; background-color: rgba(241, 241, 241, 0.7)">\<p style="margin: 0; line-height: 1.6; white-space: pre-wrap; display: block">性质\</p>\</th>\</tr>\</thead>\<tbody>\<tr>\<td style="border: 1px solid #ddd; padding: 8px 12px; vertical-align: top">\<p style="margin: 0; line-height: 1.6; white-space: pre-wrap; display: block">默认必需（dsh 选的这个）\</p>\</td>\<td style="border: 1px solid #ddd; padding: 8px 12px; vertical-align: top">\<p style="margin: 0; line-height: 1.6; white-space: pre-wrap; display: block">过度拒绝：日志读不出来\</p>\</td>\<td style="border: 1px solid #ddd; padding: 8px 12px; vertical-align: top">\<p style="margin: 0; line-height: 1.6; white-space: pre-wrap; display: block">麻烦，但不危险\</p>\</td>\</tr>\<tr>\<td style="border: 1px solid #ddd; padding: 8px 12px; vertical-align: top">\<p style="margin: 0; line-height: 1.6; white-space: pre-wrap; display: block">假如默认可忽略\</p>\</td>\<td style="border: 1px solid #ddd; padding: 8px 12px; vertical-align: top">\<p style="margin: 0; line-height: 1.6; white-space: pre-wrap; display: block">静默重建出一个被掏空的会话\</p>\</td>\<td style="border: 1px solid #ddd; padding: 8px 12px; vertical-align: top">\<p style="margin: 0; line-height: 1.6; white-space: pre-wrap; display: block">读了个假的\</p>\</td>\</tr>\</tbody>\</table>\</div>\<p>一个是读不了，一个是读了个假的，后者危险得多。所以默认值定在必需：拿不准就拒绝。这个取向前面已经见过好几次，下一段给它一个名字。\</p>\<p>是不是很眼熟？守卫不许放行、审批无人应答降级为拒绝、沙箱不可用就抛异常，第 06、07 讲你已经见过这个选择的三种样子。它有个正式名字：\<strong>失败关闭（fail closed）\</strong>，拿不准时，宁可停下来，也不带着不确定性继续。这一节的第三条硬约束，读不懂就不重建，是它的第四种样子，形状一模一样：认不出这条事件，就停下来、拒绝重建，而不是带着一个被掏空的会话继续。\</p>\<p>另两条严格说不属于它，各有各的名字：\</p>\<ul>\<li>\<p>\<strong>坏数据进不来是尽早失败\</strong>（fail fast）：在 \<code>append\</code> 这一行就炸，绝不让坏数据拖到落盘或重放时才暴露。它跟失败关闭不冲突，只是角度不同，失败关闭讲往哪边倒（安全侧），尽早失败讲\<strong>什么时候炸\</strong>（越早越好）。\</p>\</li>\<li>\<p>\<strong>写下就锁死\</strong>根本不是失败处理，而是让失败无从发生：深冻结之后，改这个动作在类型和运行时两处都不存在，也就无所谓失败不失败。\</p>\</li>\</ul>\<p>三条合起来是同一个取向：不猜、不拖、不给悄悄出错的机会。\</p>\<h3>第一个投影：消息历史\</h3>\<p>日志这头稳住了，从它算出来的东西才可信。上面记下了 8 条事件，可模型并不需要看到全部。为什么？\</p>\<p>那 8 条里只有 3 条是对话内容——用户问了什么、模型答了什么、工具返回了什么。剩下 5 条都是记账：一轮从哪开始到哪结束（\<code>turn/start\</code>、\<code>turn/end\</code>）、一次模型调用何时起止（\<code>step/start\</code>、\<code>step/end\</code>）、模型要求了什么调用（\<code>tool/call\</code>）。\</p>\<p>它们不是没用，恰恰相反，少了这些边界信息，事后就没法把当时发生的事原样还原。只是还原给谁都行，唯独不必念给模型听。\</p>\<p>先看哪些行被挑了进去：\</p>\<pre>\<code>--- ④ surface：只有 3 个节点进得了 ---

nodes = \[2,3,5\]，replaceGeneration = 0\</code>\</pre>\<p>\<code>nodes = \[2,3,5\]\</code>，8 条里只有这三个 seq 浮到了模型看得见的那一层上。浮上去的这三条，官方叫节点（node），\<code>nodes\</code> 里存的就是它们的 seq：seq 2 是 \<code>user/message\</code>、seq 3 是 \<code>assistant/message\</code>、seq 5 是 \<code>tool/result\</code>，正是刚才表里标是的那三种。\</p>\<p>这里有两个容易混的东西，先分清楚：\<strong>surface 是名单\</strong>——哪几条事件浮上来了、按什么顺序（\<code>nodes\</code> 里那几个 seq 就是它，靠每条事件的 \<code>surfaceOp\</code> 维护）；\<strong>消息历史是照这份名单算出来的投影\</strong>。名单归日志管，投影归算法管，不是一回事。\</p>\<p>旁边的 \<code>replaceGeneration\</code> 先记着，讲替换时会用到。\</p>\<p>框架把这件事钉成了类型：\</p>\<pre>\<code>type SurfaceEventType = 'user/message' | 'assistant/message' | 'tool/result'\</code>\</pre>\<p>先分清两个词：\</p>\<ul>\<li>\<p>\<strong>事件\</strong>：日志里的一条记录。账上实实在在的一笔，有 \<code>seq\</code>、进日志即冻结、能落盘。\</p>\</li>\<li>\<p>\<strong>消息\</strong>：发给模型的那一句。它不是日志里的记录：日志里只有事件，没有消息；消息是 \<code>deriveMessages()\</code> 从事件算出来的结果。\</p>\</li>\</ul>\<p>8 条事件，最后只算出 3 条消息。\</p>\<p>只有这三种事件会变成消息，不过还有个附加条件：事件里得真的有内容。\</p>\<p>举个极端例子：模型被 max-tokens（单轮输出上限）掐断、一个字都没吐出来时，日志照样记一条 \<code>assistant/message\</code>，拿它承载这一轮的用量、provider（模型提供方）和 model（用的哪个模型）；但内容为空，它就算不出消息。\</p>\<p>还有一种类型容易被误会：\<code>assistant/chunk\</code>，它在表格里标的是否，可它明明是模型说的话。为什么不进？因为它是流式输出的原始分片，一个分片一条；模型要看的是组装好的那一条 \<code>assistant/message\</code>（官方原话：derived history uses this）。分片留在日志里，为的是 token 级的回放保真。\</p>\<p>光知道哪些类型能进还不够，每条事件追加时还得声明自己进来时的动作：\</p>\<pre>\<code>type SurfaceOp = 'append' | { op: 'replace'; start: number; end: number }\</code>\</pre>\<p>\<code>'append'\</code> 是加到尾巴，常规路径。\<code>replace\</code> 是把某一段替换掉，那是压缩（compaction）把一大段历史换成一段摘要时才用的——压缩本身不在本讲范围。配合它的 \<code>replaceGeneration\</code> 每发生一次替换就 +1，好让消费方分清只是尾巴长了和历史被重写了。\</p>\<p>这里藏着整套设计最漂亮的一处：想改掉已经写下的历史（比如把前面几轮收成一段摘要），你不能回头去涂改那几条事件，只能在后面再追加一条替换指令。账本本身一字未动，动的是新追加的那条指令；至于看起来被改了，是读的时候照着指令算出来的。\</p>\<p>于是两个本来打架的诉求，被同一套机制同时满足了：底下那本账永远不变，上头看起来又能改，压缩、裁剪照做不误。\</p>\<p>再看挑完之后的历史长什么样。第 ⑤ 段就是它：\</p>\<pre>\<code>--- ⑤ deriveMessages()：从日志算出的消息历史 ---

user | 现在几点了？

assistant | 我来看一下时间。

user | \<tool-result>

小结：3 条消息，来自 8 条事件\</tool-result>\</code>\</pre>\<p>输出里第三行是工具结果，角色却写着 \<code>user\</code>。这不矛盾，API 就是这么规定的：工具结果必须以 \<code>user\</code> 角色、装进一个 \<code>tool-result\</code> 块里回给模型。日志的事件类型和消息的角色是两套分类，各管各的。\</p>\<p>最后，谁来算。 是 \<code>deriveMessages()\</code>。它做的事说白了就两步：一是\<strong>过滤\</strong>（只认浮到 surface 上的那几个节点）；二是\<strong>加映射\</strong>（每个节点照规则换成一条消息，一对一地换，不是多条并一条；内容为空的换不出来，就跳过。官方管这一步叫 fold）。合起来就是把整本账压成模型实际能看到的那份会话记录。这就是本讲最基础的一个投影。\</p>\<p>注意，它是算出来的，不是存出来的：消息历史不在任何地方落库。\<code>deriveMessages()\</code> 给你的，就是日志里那几条事件的 \<code>data\</code> 本身，同一块内存，只是换了个角度看。所以准确的说法是随时能从日志重建，而不是每次从头把整本账重算一遍。\</p>\<p>至于开销，它带缓存，不必每次从头算：每个节点只在首次出现时算一次，之后再调用只算新增的那几个；只有 surface 被整体重写（\<code>replace\</code>）时才整份作废重算，靠的就是前面那个 \<code>replaceGeneration\</code>。缓存怎么存、什么时候扔、为什么它不作数，第五节一并讲。\</p>\<p>于是改历史这条路被堵得死死的，而且只堵了一处：投影和日志是同一块内存，那块内存进日志时就冻上了。日志改不动，投影自然也改不动，本来就是一件事。\</p>\<h3>投影单元（Projection unit）：三个纯函数加一点声明\</h3>\<p>消息历史只是一个投影——官方内置的那一个。这套机制对谁都开放：任何插件都能注册自己的投影，会话标题、待办清单、跑了多少次工具……都能这么算。这些投影\<strong>互不干扰\</strong>，也\<strong>都不改账本\</strong>：\<code>deriveMessages()\</code> 和你注册的单元读的是同一本账，各算各的，谁也改不了账上任何一个字。\</p>\<p>这套机制里，你想算的每样东西都配一个投影单元：一个普通小对象，装着三个函数，外加一点声明。\</p>\<p>那三个函数有个硬要求：\<strong>必须是纯函数\</strong>，同样的输入永远得出同样的输出，不碰外面的任何状态。\</p>\<p>为什么这么严？因为日志随时要能被重放，重放就是把事件从头再算一遍；函数若读了时钟、改了全局变量，同一份日志算两次会得出两个结果，那日志是唯一依据就成了一句空话。\</p>\<p>这也是缓存敢存在的理由：既然同样的输入永远得出同样的输出，算过一次的结果就可以一直用下去，不必每次回头跟日志核对。换句话说，纯函数是缓存的安全前提。\</p>\<p>下面写一个我们自己的单元：\<code>demo/stats\</code>——统计这次对话问了几次、调了几个工具（它是本讲示例脚本 \<code>projection-demo.ts\</code> 里注册的，官方并没有这个 key）。第一步是声明合并：在 \<code>SessionProjectionMap\</code> 这张类型表上给自己占一格。\</p>\<pre>\<code>interface Stats {

userTurns: numbertoolCalls: number

}

declare module '@deepseek-ai/dsh-session-projection' {

interface SessionProjectionMap {

'demo/stats': Stats

}

}\</code>\</pre>\<p>然后是单元本身：\</p>\<pre>\<code>const statsUnit = {

key: 'demo/stats' as const, \*// 它在类型表上占的格子\*schema: z.object({ \*// 交给客户端前的校验\*userTurns: z.number(),

toolCalls: z.number(),

}),

init: (): Stats => ({ userTurns: 0, toolCalls: 0 }), \*// 空日志时的状态\*apply: (state: Stats, event: SessionEvent): Stats => { \*// 纯转移\*if (event.type === 'user/message') return {...state, userTurns: state.userTurns + 1 }

if (event.type === 'tool/call') return {...state, toolCalls: state.toolCalls + 1 }

return state \*// 与己无关：原样返回同一个引用\*

},

view: (state: Stats): Stats => state, \*// 状态 → 交给客户端的全量值\*stateVersion: 1, \*// 状态更新规则变了就 +1，让旧的缓存行作废\*

}\</code>\</pre>\<p>注意 \<code>key\</code> 后面的 \<code>as const\</code>：少了它，\<code>key\</code> 会被推断成 \<code>string\</code>，注册时就对不上类型表里的那一格了。（\<code>schema\</code> 那行用的是 zod，\<code>z\</code> 就是它；它描述的是投影值交给客户端之前的形状，不是事件在日志里的形状。）\</p>\<p>注：示例脚本的 \<code>apply\</code> 开头还多一行 \<code>applyCount++\</code>，那是为了打印后面那两个计数，与投影机制本身无关。\</p>\<p>单元交出去之后，谁来用？\<strong>框架\</strong>。写单元的人一行订阅都不写，注册表（\<code>ctx.sessionProjections\</code>）只订阅一次 \<code>session/event\</code>，之后每追加一条事件就把它喂给每个单元的 \<code>apply\</code>。所以投影不是用的时候才算，而是事件一到就被推着算。\</p>\<p>要推得动，会话得是 \<code>ctx.sessions.create()\</code> 造的活跃会话；\<code>Session.create()\</code> 造的游离会话不广播，是座孤岛。\</p>\<p>跑 \<code>npm run start:ch08:projection\</code>：\</p>\<pre>\<code>--- ① 一条事件都还没有时的投影 ---

{"asOfSeq":-1,"values":{"demo/stats":{"userTurns":0,"toolCalls":0}}}

\--- ② 追加 5 条事件之后 ---

{"asOfSeq":4,"values":{"demo/stats":{"userTurns":2,"toolCalls":1}}}

apply 被调用了 5 次（事件数 = 5）

但变更通知只发了 3 次

\--- ③ 卸载投影单元之后 ---

{"asOfSeq":4,"values":{}}\</code>\</pre>\<p>三处值得看：\</p>\<ul>\<li>\<p>\<code>apply\</code> 调 5 次，通知只有 3 次。 \<code>turn/start\</code>、\<code>step/start\</code> 与这个单元无关，\<code>apply\</code> 原样返回了同一个 state 引用；注册表用 \<code>Object.is\</code> 一比，发现没变，下游一点活都不干。契约写得很死：不关心的事件必须返回同一个引用，与己无关的事件，代价几乎为零。\</p>\</li>\<li>\<p>\<code>asOfSeq\</code> 是水位线。 每段输出那个 \<code>{"asOfSeq":…,"values":{…}}\</code> 就是一次快照：\<code>values\</code> 里一个 key 一个值，是该单元当前的整体值；\<code>asOfSeq\</code> 则说明它们都算到日志的哪一行（空日志是 \<code>-1\</code>）。所以你拿到的永远是一个一致的切面；而且给的是全量值，不是比上次多了一个的裸增量，消费方不必自己维护累加器，漏听一次也不会算错账。\</p>\</li>\<li>\<p>\<strong>注册本身是一个 effect\</strong>。第 ③ 段把单元注销，\<code>values\</code> 立刻变空——投影随之消失。这跟第 01 讲的 Cordis effect 是同一套：卸载干净，不留残余。\</p>\</li>\</ul>\<p>至于形状，照着上面那个单元加一格就行：在类型表上声明合并出一个 key，注册一个单元，剩下的驱动、缓存与通知全部由框架接管。\</p>\<h3>投影不必每次从头算\</h3>\<p>投影真跑起来，还有一个现实问题：每次都从第一行算起？ 不必。\</p>\<p>算到第 N 条时的状态，可以顺手记成一张便利贴（检查点）：\<code>算到第几行 + 结果是什么\</code>。下次从便利贴接着算，不用从头翻账本。\</p>\<p>但便利贴永远不是权威，它只是条抄近路的捷径，可能陈旧，却绝不能错。所以丢了、脏了、跟当前单元的版本对不上，系统的处理一律相同：把便利贴扔掉，重新翻账本算一遍。正因为它随时可以扔，写它的时候才敢 fail-soft（失手也不致命）：写不进去就写不进去，顶多下次多算几行，绝不会因此给出错误的值。\</p>\<p>单元声明里那一格 \<code>stateVersion\</code>，也是同一个思路，它管的是\<strong>规则变了没有\</strong>：状态字段或更新规则一变就 +1，落盘时这个值写进缓存行的 \<code>ver\</code> 字段；读回来 \<code>ver\</code> 跟当前 \<code>stateVersion\</code> 对不上，那一行就被直接丢弃、整份重算，而不是拿旧规则去接着算新事件——那只会把缓存喂成一堆垃圾。\</p>\<p>顺带划清一个容易混的东西：它跟崩溃恢复用的\<strong>持久化检查点\</strong>不是一回事。后者管的是日志本身接不接得上（那是第 09 讲的事），前者只是投影的加速手段，丢了不过是下次多翻几行账本。\</p>\<h3>本讲小结\</h3>\<p>今天这一讲，我们回到了会话这条主线，把状态存哪儿这件事讲清楚了。\</p>\<p>我们看清了：一次会话就是一份只能追加的事件日志，\<code>seq\</code> 连号、进日志即冻结、非无损 JSON 在入口被拒，读不懂的事件也默认拒绝重建；只有三种事件进 surface 并算成消息——8 条事件最终只算出 3 条消息；而投影把这套“从日志算东西”的做法通用化了：交出 \<code>init\</code>/\<code>apply\</code>/\<code>view\</code> 三个纯函数，驱动、缓存与通知全由框架接管。\</p>\<p>这背后真正的变化是，你不再把消息历史当成一份需要单独维护的数据，而是把它看成一份从日志算出来的投影；历史根本改不动，能做的只有“再追加一条”。\</p>\<p>这，就是会话日志的本质：只追加的日志保证只有一份说了算的历史，谁都改不了；投影保证任何人想要任何一种视图，都能从这份历史里算出来，不必另存一份可能与真相打架的副本。两者合起来的效果是——不管你想看模型眼里的会话、想数这一轮跑了多少步，还是要在中断之后完整重放，答案永远只能来自同一个地方：那本谁都改不了的流水账。\</p>\<p>有了这份日志，很多事情才有了着落：它怎么落盘、断了怎么接上、太长怎么压缩、跨会话怎么检索——这些我们接下来一讲一讲拆开看。下一讲先聊最实际的一个：会话续接——fork、resume 与崩溃修复。\</p>\<p>注：\<a href="https://github.com/zhangjessey/deepseek-harness-cookbook/tree/main/src/ch08" title="">本讲 GitHub 链接\</a>\</p>\<h3>思考题\</h3>\<p>动手实操：在 \<code>log-demo.ts\</code> 那一串 \<code>session.append(...)\</code> 的最后（\<code>turn/end\</code> 那一条之后）再补一轮，\<code>turn/start\</code>、\<code>user/message\</code>、\<code>turn/end\</code> 三条，turn 编号用 2（\<code>user/message\</code> 别漏了 \<code>surfaceOp\</code>，对这个类型是必填的），重新跑 \<code>npm run start:ch08\</code>。观察三个数字：事件总数、\<code>deriveMessages()\</code> 的条数、\<code>surface.nodes\</code>。想一下为什么消息只多了 1 条而事件多了 3 条，多出来的那两条属于哪一类？提示：它们是本节说的记账事件。\</p>\<p>小改动：在 \<code>projection-demo.ts\</code> 里，把 \<code>apply\</code> 最后那句 \<code>return state\</code> 改成 \<code>return {...state }\</code>（也就是无论什么事件都返回一个新对象），重新跑 \<code>npm run start:ch08:projection\</code>。变更通知次数变成了多少？和原来的 3 次差在哪儿？这印证了本讲的哪条约定？\</p>\<p>欢迎把你的运行结果分享出来。如果你觉得这节课对你有帮助，也欢迎分享给其他朋友，我们下节课再见！\</p>\</object>BigIntsymbolundefinedNaNInfinity-0MapSetDateappendappendsession.eventsDateDateDateappendisFrozendataTypeErrorturndataignorableignorable?: truetruefalsefalsefalsetrueappendturn/startturn/endstep/startstep/endtool/call--- ④ surface：只有 3 个节点进得了 ---

nodes = \[2,3,5\]，replaceGeneration = 0nodes = \[2,3,5\]nodesuser/messageassistant/messagetool/resultnodessurfaceOpreplaceGenerationtype SurfaceEventType = 'user/message' | 'assistant/message' | 'tool/result'seqderiveMessages()assistant/messageassistant/chunkassistant/messagetype SurfaceOp = 'append' | { op: 'replace'; start: number; end: number }'append'replacereplaceGeneration--- ⑤ deriveMessages()：从日志算出的消息历史 ---

user | 现在几点了？

assistant | 我来看一下时间。

user | \<tool-result>

小结：3 条消息，来自 8 条事件\</tool-result>userusertool-resultderiveMessages()deriveMessages()datareplacereplaceGenerationderiveMessages()demo/statsprojection-demo.tsSessionProjectionMapinterface Stats {

userTurns: numbertoolCalls: number

}

declare module '@deepseek-ai/dsh-session-projection' {

interface SessionProjectionMap {

'demo/stats': Stats

}

}const statsUnit = {

key: 'demo/stats' as const, \*

toolCalls: z.number(),

}),

init: (): Stats => ({ userTurns: 0, toolCalls: 0 }), \*

if (event.type === 'tool/call') return {...state, toolCalls: state.toolCalls + 1 }

return state \*

},

view: (state: Stats): Stats => state, \*

}keyas constkeystringschemazapplyapplyCount++ctx.sessionProjectionssession/eventapplyctx.sessions.create()Session.create()npm run start:ch08:projection--- ① 一条事件都还没有时的投影 ---

{"asOfSeq":-1,"values":{"demo/stats":{"userTurns":0,"toolCalls":0}}}

\--- ② 追加 5 条事件之后 ---

{"asOfSeq":4,"values":{"demo/stats":{"userTurns":2,"toolCalls":1}}}

apply 被调用了 5 次（事件数 = 5）

但变更通知只发了 3 次

\--- ③ 卸载投影单元之后 ---

{"asOfSeq":4,"values":{}}applyturn/startstep/startapplyObject.isasOfSeq{"asOfSeq":…,"values":{…}}valuesasOfSeq-1values算到第几行 + 结果是什么stateVersionververstateVersionseqinitapplyviewlog-demo.tssession.append(...)turn/endturn/startuser/messageturn/enduser/messagesurfaceOpnpm run start:ch08deriveMessages()surface.nodesprojection-demo.tsapplyreturn statereturn {...state }npm run start:ch08:projection

公开

同步至部落

取消

完成

0/2000

直线

曲线

AI

2026-09-11给文章提建议

馨冉

Command + Enter 发表

0/2000字符

提交留言