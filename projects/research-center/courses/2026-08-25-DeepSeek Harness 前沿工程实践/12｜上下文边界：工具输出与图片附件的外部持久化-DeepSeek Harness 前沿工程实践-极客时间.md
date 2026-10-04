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

讲述：张嘉熙AI版大小：12.50M时长：10:56

<audio title="12｜上下文边界：工具输出与图片附件的外部持久化" src="https://res001.geekbang.org/media/tts_audio/20260920/tts-16349-25-1018476/ld/ld.m3u8"></audio>

你好，我是张嘉熙。

核心篇讲到这里，能力、工具和会话都齐了——只差最后一条边界没划：模型眼前那份上下文，到底该装什么、又该把什么留在外面？

其中最占地方的是两类：工具吐出的大段输出、用户拖进来的图片。装不下之后怎么腾地方， 第 10 讲 我们聊过了，本讲看的则是更前面一步——该不该让它们直接整份进去：

工具一次吐出一大段文本，该整份进上下文吗？

用户拖进来的一张截图，也该整份进上下文吗？

这两类，dsh 给它们各开了一条外置通道——下面两节各讲一条。

关于环境：本讲新增三个包——@deepseek-ai/dsh-attachment-local（附件的本地后端）、@deepseek-ai/dsh-home-paths（它的 peer 依赖），以及 @deepseek-ai/dsh-output-retention（策略插件裁头尾预览要用），已加入本项目的 package.json，npm install --legacy-peer-deps 装上即可。溢出存储的三个包（@deepseek-ai/dsh-spill / -local / -policy）此前只写在依赖里，本讲才第一次真正用上。

两点提醒：本项目用 --legacy-peer-deps 安装，peer 依赖必须显式写进 package.json，漏了就报 ERR\_MODULE\_NOT\_FOUND；附件后端还要用到原生模块 sharp（装的是预编译包，不用本地编译）。

关于示例：npm run start:ch12:spill 跑溢出存储（超大的工具输出怎么被换成预览和指引），npm run start:ch12:attachment 跑图片附件（存进去、看字节落在哪、看日志里留下什么、再取回字节），npm run start:ch12:admission 跑准入（超限和不合规怎么被拒）。

### 工具输出的外部持久化：溢出存储

第一个问题：工具一次吐出一大段文本，该整份进上下文吗？

不该。这样一大段输出不该原样整段进下一次请求（官方原话是不应完整占用下一次模型请求），但它后面可能还有用。另外，日志只追加、不改写（ 第 8 讲 ），一旦写进去就再也删不掉了。

那这些内容放到哪儿？存成文件，日志里只留预览和指引，这就是溢出存储（spill），分两步：完整存成文件，然后让进日志的那份只留“头尾预览 + 一句去哪儿读全文”。

两个“溢出”要分清，它们只是同名，不是一回事：本讲的“溢出存储”是当场定的，工具一跑完，在写进日志之前判定单条输出的字节数（跟部署配的 maxInlineBytes 比）； 第 10 讲 的“溢出”是请求被拒之后才确认的，判断的是整个请求超没超模型的窗口。

落到实现上，动手的是溢出策略插件 dsh-spill-policy——它本质是个结果转换器：工具跑出来的结果，超了阈值的就被它换掉，原文一份不丢。它注册两个监听器，挂在两处：一是工具执行之后（tools/post-execute），结果超了阈值就整份存走；二是 Code Mode（ 第 6 讲 ）的 tools/code-dispatch-log：Code Mode 里，run\_code 程序会调别的工具，每个结果程序先拿去继续跑，还会再记一份进日志留档（tool/code-dispatch 事件）。策略插件管的就是日志这份：超了阈值，就换成预览加指引（原文已另存成文件）。

这个插件只提供一个配置项 maxInlineBytes，两个监听器都照它判。判据也就一句话：超过这个字节数就存成文件，不超过就照原样进上下文。它没有内置默认值，阈值是部署决策，库不替你定；不配，就什么都不发生，工具输出照旧整份进上下文。

名字分清楚了，还有一处更容易混：溢出存储跟第 10 讲的压缩、裁剪都在对付“装不下”的问题，但管的不是同一件事。先把它们摆开：第 10 讲对应的是裁剪，它和溢出存储一样，管的都是单条过大；压缩管的则是“历史整体太长”。而压缩、裁剪都是事后在 surface 上动手、只往后追加、不改已有事件，溢出存储却在写进日志之前就分流，这是两讲最根本的分工：

|  | 第 10 讲裁剪 | 本讲溢出存储 |
| --- | --- | --- |
| 时机 | 窗口有压力或已溢出时，才回头裁一次（CompactionTrigger 就这两种；裁剪自己不注册监听器） | 每次工具跑完，当场判一次 |
| 动的是哪一层 | 事后在 surface 上腾地方，已有事件一条不改（只往后追加） | 在写进日志之前就把内容分流掉 |
| 判据 | 字符数 > thresholdChars（默认 8192） | 先看是不是纯文本（源码 flattenPlainText 逐个块看，有一个块不是文本就整条不外置），再看字节数 > maxInlineBytes（没有默认值：不配置就没有这道阈值，多大的输出都整份进） |
| 替换结果 | 头 + 一行标记 + 尾 | 头尾预览 + 一句"（省略了多少字节）全文存在 < 定位符 >，< 检索提示 >" |
| 中间部分 | 还在日志里（旧事件一条不丢） | 在文件里，日志里只剩预览 |
| 回头还能查吗 | 取不回——不浮到 surface 上，也没有取回的入口 | 能取回——文件还在，按 locator |
| 结果长度 | 定死的：头 + 标记 + 尾，三者相加 | 预览 + 提示，整体不超过 maxInlineBytes（提示本身就超了，就不外置） |

纯文本这条边界划好了：超了阈值就外置，模型需要时按指引取回。

判据说完了，真要存的时候调的是服务，它只暴露一个动作 saveText，存进去，换回三样东西：

const ref = await ctx.spillStore.saveText({

owner: { sessionId: SessionId('sess-demo') },

source: { toolName: 'web\_fetch', callId: CallId('call-1'), label: 'result' },

suggestedName: 'web\_fetch.txt',

content: bigText,

})

示例里这一步由策略插件代劳，它判出超了阈值，就替你去调 saveText。跑 npm run start:ch12:spill：

\--- ① 工具跑完，原始输出多大 ---

纯文本：60016 字节

阈值 maxInlineBytes：50000 ← 超了，策略插件动手

\--- ② 模型眼前那份（换过之后）---

头：## Section

This document explains how context overflow happens and what to do about it.

\## Secti…

…（中间被预览截掉了）

尾：…/...-web\_fetch.txt. Use read with offset/limit, or grep this path to search within it.

替换后：50000 字节

\--- ③ 全文存在哪 ---

定位符（locator）：/var/folders/.../dsh-ch12-spill-.../session-2f1617f23ca8/...-web\_fetch.txt

落盘：60016 字节，权限 600 ← 一个字节都没少

检索提示（retrievalHint）：Use read with offset/limit, or grep this path to search within it.

返回的三样，各有各的用处，对着输出看：

|  | 是什么 | 要点 |
| --- | --- | --- |
| locator | 后端给出的不透明定位符 | 消费方不解析它、只当黑盒。本地后端把它渲染成文件路径，换后端可能是 URI 或键；路径形如 <…>/<sha256(会话 id) 前 12 位 >/< 随机前缀 >-\<suggestedName> |
| bytes | 存了多少字节 | 用来对账。示例里落盘 60016 字节，跟工具原本吐出的一个字节都不差；saveText 自己不判阈值（判阈值的是上面那个策略插件），多大的文本都存得进去 |
| retrievalHint | 给模型看的检索指引 | 告诉它"用 read 分段读，或用 grep 在这个路径里搜" |

三样东西都在手上了，那是存的一方拿到的。存到外面之后，模型怎么看见它？文本这条路是“告诉模型自己去拿”。

那条结果被换成头尾各一小段预览，外加一句通知，就是前面说的那句“去哪儿读全文”，由 locator（全文在哪）和 retrievalHint（怎么读）两样拼成；剩下那一样 bytes 只用来对账，不进上下文。都是纯文本，模型后面还想看，用 grep 就能翻。中间那部分一直在文件里、随时能取回，外置不是丢弃，是把它换成“需要时取得到”。

### 图片的外部持久化：存成附件

第二个问题：用户拖进来的一张截图，也该整份进上下文吗？

不该。图片的字节不落进日志，上下文里也只留一个引用，而且不论大小，一律外置。官方点名四种东西绝不允许进这本只追加的日志：

三种引用：blob: URL、宿主临时路径、提供方 URL，指向的东西易失效或不可控；

base64 数据：它则相反，不是引用，是数据本身，塞进日志会膨胀、还删不掉。

上面四类都被禁了，图片走的是另一条通道，dsh 给出的答案是附件（attachment）：先把字节存成不可变对象，日志里只留一个引用。这个引用和前面那三种不一样：它指向的是 dsh 自己先落盘的字节，对象就在 dsh 的盘上、随时能读回；那三种指向的是 dsh 掌控之外的东西，说没就没。

外置这一步没有阈值，不像文本那样超了才外置，图片不分大小、一律外置。而图片能不能真的存进去，是另一道关卡——准入，管的是类型、大小、像素、张数这些限制，不支持或超了，直接报错（类型由后端按字节识别出的实际格式说了算，不采信声明的 mediaType）。

存进去有条硬规矩——先落盘，后追加事件：宿主必须先让图片真的落到磁盘上，才能把 user/message 写进日志（模型输出图片时同理），否则日志里就会留下一条指向不存在的对象的引用。

规矩说完了，校验、落盘和取回都调附件服务 ctx.attachments：

await ctx.attachments.validateImage({ data, mediaType })

const ref = await ctx.attachments.saveImage({ data, mediaType, name })

const refs = await ctx.attachments.saveImages(\[one, two\])

const stored = await ctx.attachments.readImage(ref)

跑 npm run start:ch12:attachment：

\--- ① 一张图存进去，拿到什么 ---

attachmentId：sha256:c2ab983c5681efb075d3b64315727791fdcf91bc61338f83f6a327a5ec206a34

类型 / 尺寸 / 字节：image/png 8x8 95 字节

name：pixel.png ← 传进去的是 /Users/alice/secret/pixel.png，路径被剥掉了

\--- ② 字节落在哪 ---

.../attachments/v1/objects/c2/c2ab983c…206a34

文件权限 600，目录权限 700

落盘 95 字节，与 ref.bytes 一致：true

\--- ③ 同一张图再存一次 ---

attachmentId 相同：true ← 内容寻址，天然去重

objects 下的对象数：1

\--- ④ 日志里存的到底是什么 ---

{"type":"user/message","seq":0,"time":...,"data":{"content":\[{"type":"image","attachment":{"attachmentId":"sha256:c2ab983c5681efb075d3b64315727791fdcf91bc61338f83f6a327a5ec206a34","mediaType":"image/png","width":8,"height":8,"bytes":95,"name":"pixel.png"}}\],"source":{"kind":"user"},"role":"user","id":"..."},"surfaceOp":"append"}

日志字符数 373，图片 95 字节 ← 字节一个都没进日志

\--- ⑤ 要发给模型时再取回来 ---

readImage：95 字节，image/png，8x8

日志里只有引用，字节一个都没进去。④ 那条 user/message 的 content 是一个 ImageBlock，装着 attachmentId、尺寸、字节数这些元数据，图片字节留在盘上，日志里只是指向它的引用。

前面说的准入，就是 ctx.attachments.imageLimits 这条线。跑 npm run start:ch12:admission，看它怎么运作：

maxImageBytes：5242880

maxImagesPerMessage：20

maxMessageImageBytes：104857600

maxImagePixels：40000000

mediaTypes：\["image/png","image/jpeg","image/webp","image/gif"\]

抛错：Unsupported or malformed image data.（code=INVALID\_IMAGE）

存储根被建出来了吗：false ← 校验只是看看，一个字节都不写

抛错：Unsupported or malformed image data.（code=INVALID\_IMAGE）

存储根里已落盘的对象数：0 ← 先全量校验、再按序提交；坏在校验阶段就一个都不落

新限制下再存同一张：Image exceeds the configured byte limit.（code=IMAGE\_TOO\_LARGE）

但读回收紧之前那张：95 字节，没问题 ← 准入只在写入时生效

准入线看完了。存到外面之后，模型怎么看见它？图片这条路是“发请求时才解析”，它在日志里的形态是一个内容块（ImageBlock）：

interface ImageBlock {

type: 'image';

attachment: ImageAttachmentRef; \*

}

真正把图片的字节读回来，发生在发请求给模型的时候：提供方的适配器会拿着引用去 readImage()，把字节转成 base64 放进请求。

所以它和文本那条路正好相反：文本是模型自己再发一次工具调用去取，图片则是 dsh 在发请求时自动解析、模型不用动手。根源就在“能不能被模型自己检索”：文本是纯文本，给它一条路径，模型用 grep 就能自己翻；图片是字节，模型没法 grep 一张图。

至于这些图片对象的存放、归属、授权和回收，和溢出存储很不一样：

|  | 溢出存储 | 附件 |
| --- | --- | --- |
| 存放位置 | 会话目录下（默认在进程级临时目录） | 全局的 <DSH\_HOME>/attachments/v1 |
| 归属 | 随会话——fork 出去的子会话继承已有定位符，新产生的归子会话 | 不随会话——全局一份，谁引用都行 |
| 回收 | 很可能随会话清理一起失效 | 目前不自动删，没有垃圾回收 |
| 授权 | 靠盘上权限——只有所有者能读（文件 600、目录 700），不按会话授权 | 授权是会话级的——只有引用它的会话能读回字节 |

### 本讲小结

这一讲划下最后一条边界：工具的大段输出、用户拖进来的图片，都不该整份进上下文，dsh 给它们各开了一条外置通道。

溢出存储（工具输出）只管纯文本：超阈值就整份存走，上下文里只留头尾预览和一句"去哪儿读全文"。

附件只管图片：先落盘、后追加事件，日志里只留一个 ImageBlock 引用，发请求时 dsh 才解析回字节。

这，就是上下文边界的核心：入口处，大块内容（工具大段输出、图片）只进线索、不进全文，需要时再取回；进去之后，一旦逼近或越过窗口边界，就靠第 10 讲的压缩和裁剪腾地方。

到这里，核心篇：能力、工具与会话就收口了。下一讲进入编排篇：从 Agent 循环到多 Agent 协作。

注： 本讲 GitHub 链接

### 思考题

动手实操：打开 attachment-demo.ts，把第 30 行那个 name（现在是绝对路径 /Users/alice/secret/pixel.png）换成 '../../etc/passwd.png'，重跑 npm run start:ch12:attachment。预期 ① 那行变成 name：passwd.png——路径（含../）被剥掉，只剩最后一段。

第二步探测：这个 demo 没有 try/catch，而 code 挂在错误对象上、Node 默认不打印它。在 ① 之前插一段 try/catch，调 ctx.attachments.saveImage({ data: bytes, mediaType: 'image/bmp' })（声明成 bmp，实际是 PNG 字节），catch 里打出 (error as Error & { code?: string }).code，预期 IMAGE\_TYPE\_MISMATCH。

想一下：为什么报的是类型不符而不是不支持？提示：它先按字节识别出这张图实际的格式，再跟声明的比。另一个小提示：'image/bmp' 不在 ImageMediaType 联合里，tsx 跑得通、npm run typecheck 会报错，想两全就写成 'image/bmp' as never。

小改动：把 admission-demo.ts 第 57 行的 maxImageBytes: 1 换成 maxImagePixels: 1，重跑 npm run start:ch12:admission。预期 ④ 变成 code=IMAGE\_TOO\_MANY\_PIXELS——8×8 共 64 像素，也超了 1。顺带回看 ③（它走默认准入线，不受第 57 行影响）：那批里明明有一张是好的，为什么一张都没落盘？

欢迎把你的运行结果分享出来。如果你觉得这节课对你有帮助，也欢迎分享给其他朋友，我们下节课再见！

公开

同步至部落

取消

完成

0/2000

直线

曲线

AI

2026-09-21给文章提建议

馨冉

Command + Enter 发表

0/2000字符

提交留言

大纲



固定大纲

工具输出的外部持久化：溢出存储

图片的外部持久化：存成附件

本讲小结

思考题