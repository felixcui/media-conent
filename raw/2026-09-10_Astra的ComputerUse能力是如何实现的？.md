# Astra 的 Computer Use 能力是如何实现的？

**作者**: Kyle Jeong

**来源**: https://mp.weixin.qq.com/s/R6MEbYl8oPGF-f4r2LeR6A

---

## 摘要

文章解析了Astra的Computer Use实现方式：Codex启动持续运行的代码环境并接入浏览器与桌面工具，Astra则结合无障碍模式读取的界面结构与截图信息综合判断，把拟执行的操作写成代码交由Codex完成，并通过融入专业环境数据与强化学习提升界面理解和动作选择能力，减少试错与冗余交互。

---

## 正文

Kyle Jeong Kyle Jeong

在小说阅读器读本章

去阅读

[![](https://mmbiz.qpic.cn/sz_mmbiz_png/QUs3kaltEh3ZTcCuTBnTVF5fSpXM5MdTlogCygib9ibcUJ17LvIYBeUXfMuClGlM7YAVrvNVHDgKvO5icJ2MN8ETzCKyM4yKCXEBlwic8Z1SdkM/640?wx_fmt=png&from=appmsg)](https://mp.weixin.qq.com/mp/appmsgalbum?__biz=Mzg2OTY0MDk0NQ==&action=getalbum&album_id=4157672299245862924&scene=21#wechat_redirect)

作者：Kyle Jeong（Browserbase 增长工程师）

编译：Daniel

编辑：Cage

本文编译自 Browserbase 增长工程师 Kyle Jeong 对 Astra Computer Use 能力的分析，原文发布于他的个人博客。过去三年，他们团队一直在努力把 AI Computer Use 的能力用于实际业务。

　⁠

文章拆解了 Astra 模型与 Codex Harness 的配合方式：Codex 启动一个持续运行的代码环境，接入浏览器和桌面操作工具；Astra 通过无障碍模式读取界面中的文字、按钮结构，并通过截图综合判断。模型把准备执行的操作写成代码，交给 Codex 的工具完成。

　⁠

Astra 在训练过程中融入了大量专业环境和数据，并通过强化学习改进策略选择和纠错能力。模型能更准确地理解界面、选择动作，就能减少试错和反复检查，用更少的交互完成同一项任务。

　⁠

这次发布让我们看到了新的模型能力跳变：Computer Use 能力让 Agent 覆盖更多白领工作的长尾场景。激发用户主动尝试把日常工作交给 Agent 去完成。

　⁠

Astra 发布后，模型的 Aha Moment 出现在了许多过去需要专业人士才能开发操作的 visual coding 场景中。比如有人因为 Astra 而第一次接触 Blender，并做出了用于房产销售的 3D 模型。这类能快速看到成品的例子迅速在网络上铺开，激发了很多人尝试和分享的欲望。

　⁠

**Agent** **的渗透，需要一次次的能力出圈把围观者转化为使用者。** 一眼看到自己熟悉的案例，往往比评测分数更有说服力。用户反馈中，有房产从业者看到别人的 visual coding 使用经验，会想到接入自己的房源。也有视频工作者看到别人运用 Astra 管理视频工作流，主动去尝试。这些例子让更多用户知道，原来这些事情都可以交给 Agent。这样的长尾场景拓展，会帮助 token consumption 和 agent 渗透率再上一个台阶。

| ⁠ | / | ⁠ |
| --- | --- | --- |

01.

## AI Computer Use 简史

　⁠

2024 年 10 月，Anthropic 随 Claude 3.5 Sonnet 一起推出了 Computer Use 能力。他们采用的是纯视觉路线，也就是说，模型通过截图来判断如何与电脑屏幕交互。模型以像素为基础进行后训练，并以 JSON 格式返回像素坐标和动作，例如：

```json
"action": {"type": "click","x": 156,"y": 50}
```

随后，Stagehand 或 Playwright 等驱动工具会把这些输出转换为浏览器或电脑上的实际交互。

　⁠

在 Claude 3.5 Sonnet 之后，其他实验室也开始发布类似的视觉 Computer Use 模型，训练模型识别屏幕上的像素。OpenAI 发布了 Operator 和 computer-use-preview；Google DeepMind 为 Gemini 2.5 Pro 加入了 Computer Use 能力。

　⁠

但这些模型并不完美。由于后训练以像素为基础，实验室必须选定一个具体的视口尺寸，比如 1288 × 711，并在整个训练过程中保持不变。当在不同尺寸的窗口中使用这些模型时，它们就会失灵，开始点不中按钮。

　⁠

另一个明显的局限是，这些模型简单地依赖纯视觉方式与应用交互，而应用中有一些更复杂的交互，是“只靠眼睛”看不到的。

　⁠

围绕纯文本方案，以及 DOM（文档对象模型）与视觉相结合的混合 Agent，已经出现了大量实验。Standard Intelligence 的 FDM-1 就是一个很有意思的 Computer Use 实验：它为 Computer Use 编码的是视频，而不是静态截图。

　⁠

FDM-1 是 AI 公司 Standard Intelligence 开发的 Computer Use 模型，特点是通过连续的屏幕录像，学习人怎么操作电脑。

　⁠

　⁠

02.

## Astra 有什么不同？

　⁠

要理解 Astra 为什么不同，我们得先回到 5.6 模型家族，聊聊 Codex／ChatGPT 的 harness。Computer Use 既是 harness 的工程问题，也是模型的研究问题：模型决定做什么，harness 负责执行。要把 Computer Use 做好，这两个问题都需要解决。

　⁠

Computer Use 流行了很久，但它尚未证明自己已经足以用于生产环境，主要原因是不可靠。当 OpenAI 在 Codex 应用中推出 Computer Use 能力后，许多开发者开始每天使用它，也逐渐理解了这项能力有多强大。

　⁠

Codex 会打开内置或本地的浏览器去完成制定的任务。任务可以在后台执行，用户可以继续使用浏览器处理其他事情。

　⁠

Codex 中的 Computer Use 比 Atlas 更快更准，还能通过编写和执行代码完成如制作图表、调用其他工具等事情。

　⁠

Astra 在 5.6 已有能力的基础上，进一步提升了速度、降低了成本。

　⁠

![](https://mmbiz.qpic.cn/mmbiz_jpg/QUs3kaltEh1nZ71MUEajGBeLMj4EOHEwichaeL67gVHNwtADGUbjJh2vskpoLdAhOHdSTc9auH2iceovYYUMPWJ8Lg0Jz0ic96xLKLTrDyvc4M/640?wx_fmt=jpeg&from=appmsg)

　⁠

要理解这是怎么做到的，可以从研究电脑界面的组织方式开始。今天，大多数电脑都提供了你我能够看到的图形用户界面（GUI）。我们看着屏幕上的像素，决定点击哪里，这与早期模型的做法类似。

　⁠

而如今推动模型进步的是一个原为视障人士推出的功能：为了帮助视力或听力受损的人，Chrome 中的每个网站都提供了“无障碍模式”。它会把屏幕上的内容映射成一棵无障碍树（Accessibility Tree，也称 a11y tree）。这就要求应用暴露用户界面元素的语义信息，让这些元素能够被操作。

　⁠

浏览器中的无障碍树大致是这样的：

　⁠

![](https://mmbiz.qpic.cn/sz_mmbiz_jpg/QUs3kaltEh1xmkhFewYnGEabYGH8IFicL2E2mt1P9RqV4gBzibNI7Zv0QgUnb8ee59soEdTLNiaR3uk7cOEcXF6qFIHwYW27swZOgPBKb2Zx8c/640?wx_fmt=jpeg&from=appmsg)

　⁠

模型读起来会容易得多，因为它去掉了所有用于定义视觉呈现层的代码；对于网页来说，主要就是 CSS 和类名。

　⁠

无障碍树使用的 token 比截图更少，却能提供同样丰富、甚至更好的屏幕上下文。Astra 利用这棵树来发出 Computer Use 指令，比如点击、输入和按键。Chrome 中的每个网站都会自动生成一棵无障碍树，这意味着它们开箱即用地兼容 Astra。

　⁠

　⁠

03.

## 架构

　⁠

Astra 的架构相当简单：

　⁠

![](https://mmbiz.qpic.cn/sz_mmbiz_jpg/QUs3kaltEh1jBTkn6gVicYyJWZGeGABx0iaeF91Kz7hDLUHIQ4WQISt07gEnic36NdmXhaMoTz6QFNc2Rl5k7Z4lamp8znAbgZVZQ16HEUBjPU/640?wx_fmt=jpeg&from=appmsg)

　⁠

当 Computer Use 会话开始时，Codex 会启动一个 Node REPL 来保存会话状态，并提供浏览器操作或原生 Computer Use 的接口。Agent 会根据任务选择使用哪一套接口。

　⁠

无论面对原生应用还是浏览器，Agent 都会通过文本、截图，或两者结合的方式观察页面，尽可能准确地掌握当前状态。随后，它通过代码决定执行什么操作。如今的 Computer Use 实际上就是代码模式。OpenAI 的 API 文档甚至建议，所有 Computer Use 都使用代码执行。

　⁠

![](https://mmbiz.qpic.cn/mmbiz_jpg/QUs3kaltEh3icJjsCclzqds5QKSNKyTefFq1czHm5ACvzlyEDiallA6XjFNO3PV0Lok883j15wu5iboGFUSPv9ohGEL5GpG5efpwESWzOHZlqk/640?wx_fmt=jpeg&from=appmsg)

　⁠

一个输出示例如下：

```powershell
{"type": "function_call","name": "exec_js","call_id": "call_123","arguments": "{\"code\":\"await page.getByRole('searchbox').fill('browser automation'); ...\"}"}
```

本地服务（名为 CodexComputerUseIPC-5）负责执行操作。执行封装层会把所选元素转换为原生元素 ID（如果模型选择使用坐标，也可以转换为坐标），随后通过原生管道传输 JSON-RPC 消息，并借助请求 ID 匹配请求、完成执行。

　⁠

在实际使用中，OpenAI 推荐分别使用 Playwright 和 PyAutoGUI 作为控制浏览器与电脑的框架。

　⁠

Playwright：微软开发的开源浏览器自动化工具。

PyAutoGUI：程序员 Al Sweigart 创建的开源鼠标、键盘自动化工具。

　⁠

接着，Astra 会检查自己的操作结果，因为请求成功送达并不意味着操作真的生效了。模型会请求再观察一次，将当前状态与预期状态进行比对。

　⁠

这个循环会一直持续，直到任务完成。由于 Computer Use 天然需要保留状态，Node REPL 必须在整个会话期间持续运行。

　⁠

Node REPL：代表一个持续开启的代码工作台，目的是保留前面创建的变量、页面对象和中间数据，让下一步操作接着上一步继续，不必每次重新准备环境。

　⁠

在上面的表格中，Astra 是唯一一个要求自动审查的模型。Astra 使用了一套 Guardian 策略，在允许执行之前，对计划的 Computer Use 进行安全审查。

　⁠

Guardian 使用 GPT 5.6 Luna 作为后台分类器，评估当前工作流程和接下来可能出现的风险，再返回高风险或低风险的分类结果。如果被判为高风险，后续操作就会触发审查。随后，操作会交给一个安全审查模块，由它对拟议操作进行完整评估。

```json
{  "risk_level": "high",  "user_authorization": "low",  "outcome": "deny",  "rationale": "..."}
```

　⁠

安全审查会参考多方面的信息：AI 准备执行的操作及其参数、对话记录中的相关依据（包括用户授权）、主任务的运行环境与权限设置、代码执行环境（REPL）中已有的记录和图像，以及审批请求和申请理由。审查器在不拿到完整的无障碍树的情况下即可完成。

　⁠

常见的 Guardian 拦截包括：

　⁠

•授予权限：是否针对所授予的权限及接收方获得了明确授权。

　⁠

•登录及会产生重要后果的账户操作：用户是否明确授权了这些操作。

　⁠

•提交敏感数据：是否同时获得了针对数据本身和提交目的地的许可。

　⁠

•会产生重要后果的点击：界面的实际状态及点击的影响；表单输入或设置是否有误；它们是否符合用户的指示。

　⁠

•绕过限制：替代路径是否获得了授权。

　⁠

•破坏性操作：是否会造成实质性的状态丢失或不可逆的损害。

　⁠

•超出范围的私密数据访问：访问是否属于已获授权的任务范围。

　⁠

在 alignment benchmark 中，Astra 的表现显著好于前代模型。

　⁠

![](https://mmbiz.qpic.cn/mmbiz_jpg/QUs3kaltEh1QGveKJmRB5q9dEQLBEw559f4P9LromZVaYbY2F6adc1T7Sia0MK1vPwvKgePialkibDVs5vdkDLhKqbbZPwCia5vIoKsJ8ZfKrqg/640?wx_fmt=jpeg&from=appmsg)

　⁠

　⁠

04.

## 速度的代表

　⁠

相比 GPT 5.6，Astra 多了一道审查，但速度反而更快。归功于更聪明的模型，需要的交互轮次更少。

　⁠

![](https://mmbiz.qpic.cn/sz_mmbiz_jpg/QUs3kaltEh2Y5siaWentVF9m6q5Nyv2z4zUicQMOTu8biavrUMXia0Gn72WmJP0sBfrUwRMecEkOGbagstLAPUxBlEoxvslSKBzba3Y2JssrI48/640?wx_fmt=jpeg&from=appmsg)

　⁠

Astra 使用了 10 万张 GB300 进行训练，消耗的算力可谓巨大。但这个模型也聪明得多，而且在 Computer Use 环境中接受了大量 RL 训练。更聪明 → 完成任务需要的轮次更少 → 任务完成得更快。在这种情况下，推理速度并不是影响 Computer Use 能力的决定性因素；当生成速度超过每秒 300 个 token（TPS）时，动作的执行速度就会成为瓶颈。

　⁠

执行框架也做了一些优化，例如 WebSocket 预热、连接复用，以及使用 previous\_response\_id 的增量请求。不过，这些都不对应动作本身的速度，只关系到工具的启动时间。

　⁠

　⁠

05.

## 目前的缺点

　⁠

Astra 确实很惊艳，但还能发现有一些缺点。Astra 可能在观察环节出错，拿到不完整的无障碍树状态、细节不足的截图，或者已经过时的画面。在观察与执行动作之间，界面状态也可能发生变化。有些应用中的无障碍树会频繁改变，导致操作失效。

　⁠

长时间跨度的 Computer Use，仍然是一个尚未得到充分解决的问题。由于上下文压缩做得很好，Astra 可以长时间运行，并保持较高的执行质量；但当 Computer Use 连续运行数天，甚至数周时，表现究竟如何，目前还没有看到。

　⁠

　⁠

06.

## Computer Use 的前沿

　⁠

Computer Use 才刚刚开始变得好用。我们见证了它从连琐碎任务都频频失败，进步到在《我的世界》中比一个十岁孩子更快挖到钻石。人们终于开始意识到，可以把多少工作交给 AI。

　⁠

当模型从视觉与截图转向使用无障碍树之后，它们的表现就好了很多。未来更多的算力也意味着更好的模型和更低的价格；随着我们继续推动后训练的边界，模型也会在实验室选择训练的特定领域任务上持续进步。

　⁠

Astra 将速度和准确性，与强有力的安全防护结合起来，确保 Agent 不会被劫持。Computer Use 模型每迭代一代，我们就离能够用于生产环境的 Computer Use 能力更近一步。

　⁠

软件的未来，是由 AI 代表人类完成工作，让人类专注于那些需要头脑的问题。

| ⁠ | ⁠ | ⁠ |
| --- | --- | --- |

![](https://mmbiz.qpic.cn/sz_mmbiz_png/QUs3kaltEh1GD3rkF9GAicQjy7PKwVMmSd6WWqk56vZB4mibJDNkiamPKUI9w9rjyY6L8XvOo0TzhdlIv7CPlBYg3iaNVUgkKe7HtWfrmLKDSEc/640?wx_fmt=png&from=appmsg) ![](https://mmbiz.qpic.cn/sz_mmbiz_png/QUs3kaltEh2LDaH9TXOuRPAX0A3ibibMGwsjx8cLvG62pU3hBOqYcPA4vUhImADIzkCsWtBrvUgq4G3gUZEmE8gyR3vib86oqSKyOmrhUiaLPH0/640?wx_fmt=png&from=appmsg)

| ![作者卡片](https://mmbiz.qpic.cn/sz_mmbiz_png/QUs3kaltEh2wsk2licwHYwy69lE0vNwGicjBsFnNVr3G2WdMfQPYSeGDGJnDnibH6zyTX8SMQt3Pe2hPlSxyw5IIvYpSjpYATAVyOOqicwCwmeE/640?wx_fmt=png&from=appmsg) | ⁠ | ⁠ |
| --- | --- | --- |

延伸阅读

⁠

| 2 万亿美元的 Anthropic 值不值得买？ | › |
| --- | --- |

⁠

| DeepSeek Harness 是自进化 Agent 的基石 | › |
| --- | --- |

⁠

| Claude Tag 可能是一个 10x Claude Code 级别的产品 | › |
| --- | --- |

⁠

| 无法蒸馏的美国市场，谁在分食 Frontier Labs 百亿美金数据预算？ | › |
| --- | --- |

⁠

| Agent Infra 赛道更新，一年后为 Agent 设计的基建发展如何？ | › |
| --- | --- |

知道了

微信扫一扫  
使用小程序

： ， ， ， ， ， ， ， ， ， ， ， ， 。 视频 小程序 赞 ，轻点两下取消赞 在看 ，轻点两下取消在看 分享 留言 收藏 听过