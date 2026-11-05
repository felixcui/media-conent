# 为什么AI会“选择性失忆”：搞懂Transformer架构

**作者**: 朱进

**来源**: https://mp.weixin.qq.com/s/dr7Ng7goIb1eq-5UupcBew

---

## 摘要

AI 的“选择性失忆”不在参数里，而在工作记忆里：知识主要固化在 FFN 参数中，对话内容则暂存在上下文窗口。忘事由两个机制造成——自注意力 softmax 把权重摊薄（注意力稀释），以及窗口超长后早期 token 被截断；文章用“猫叫团子”等案例拆解 Token 化、位置编码、残差、LayerNorm 各零件的责任，指出残差与 LayerNorm 是“清白零件”，病灶只在自注意力。

---

## 正文

朱进 朱进

在小说阅读器读本章

去阅读

关注腾讯云开发者，一手技术干货提前解锁👇

![](https://mmbiz.qpic.cn/sz_mmbiz_png/ZRhjO8xAWr5cVljsZaTerseHo0b30q5ACI8PKQZDgtq7iaRpXwCrV8UnWMvP2gXatJwwmsic6wcF404wPNYIBa0PmibGC70MSZISib2VJoD3JRk/640?wx_fmt=png&from=appmsg)

当你跟 AI 聊了 50 轮，它却忘了第 1 轮你说过的话；可你问它三年前训练数据里的冷知识，它倒背如流。这种"选择性失忆"到底是 bug 还是特性？答案藏在 Transformer 的架构基因里。本文用精确图解 + 一个失忆案例，把机制讲透。

![](https://mmbiz.qpic.cn/sz_mmbiz_png/ZRhjO8xAWr6BN30BJ4UibOFaviby0XmlOwj0rTfgsnRqHmZbI68Mlaabfia9cWPkNUibUYkINR9WewQWnBNj01pLWJvfYy9aHM4IZzmFIFpjoJU/640?wx_fmt=png&from=appmsg)

上图就是本文的完整隐喻：一个 AI 机器人面对满墙便签（你说过的话），一束聚光灯（注意力）只照亮了几张——其余的褪色、模糊、消散。聚光灯照到哪里，它就"记得"什么；照不到的，就被遗忘了。这不是 bug，是聚焦的代价。

## 01

失忆现场与双轨定位

**1.1 一个失忆现场**

你跟 AI 说了 50 轮话，第 1 轮提到"我家猫叫团子"，第 50 轮问它"我的猫叫啥"。它回你：

> “喵？您还没告诉过我您养猫呢。”

它不是撒谎，也不是记忆力差——它在做 **选择** ：哪些信息值得占用注意力，哪些该被"挤下台"。做出这个选择的机制，就是 Transformer 的灵魂：自注意力（Self-Attention）。

但在拆解机制之前，先看清一个反直觉的真相：AI 的"失忆"其实是两套完全不同的系统在起作用。

**1.2 先分清：AI 的"双轨记忆系统"**

很多人以为 AI 只有一种记忆，其实有两条轨道，遗忘方式天差地别：

![](https://mmbiz.qpic.cn/sz_mmbiz_png/ZRhjO8xAWr756UMaBc8SOBaAERZMx7XsFaIQQ212y0nK39JLuBhs4GaJdfK4y5R39PsszeAJ2vmDMg7XqC4T6nd12icEibmO9nnKtyDSc4xGo/640?wx_fmt=png&from=appmsg)

左边这条轨道刻在 **参数** 里：训练时写死的知识，像百科全书印好了就不再变——所以 AI 永远记得"地球绕太阳转"。

右边这条轨道叫 **工作记忆** ：每次对话时临时存在"上下文窗口"里的内容，像一张用完就丢的便签——你 10 分钟前说的"我家猫叫团子"，就存在这里。

**关键结论："选择性失忆"只发生在右边这条轨道上** ——注意力稀释 + 窗口截断，与左边那本"百科全书"无关。这就是为什么 AI 忘得了你的话，却忘不了牛顿定律。

搞清楚病因在哪条轨道后，先别急着钻进公式——我们退后一步，看看 Transformer 的全景架构，排查一下到底哪些零件和失忆有关，哪些是"清白"的。

## 02

先见森林：全景排查

理解 Transformer 失忆，不能只盯着注意力——先看清整条流水线，才能锁定"病灶"位置：

![](https://mmbiz.qpic.cn/sz_mmbiz_png/ZRhjO8xAWr4eCPUNxGcaxB7ubTE2Ctt86picmqBLq5qXOsuNMZiaZ7gprEeiaLu75fysc00odvF8Yib6UvqqDSsU0FLSoHEhlggG41do3FEbbm4/640?wx_fmt=png&from=appmsg)

一条流水线读下来：

- **Token 化 + Embedding** ：文字切块、变向量——AI 的"通用语言"
- **位置编码** ：给每个词发"座位号"。自注意力天生"人脸盲"（它把输入当一袋子词），没有座位号，"猫追狗"和"狗追猫"在它眼里就是同一句话
- **自注意力（金色核心）** ：全场环顾，决定"我该听谁的话"—— **选择性记忆在这里发生**
- **前馈网络 FFN** ：对每个词独立"深度思考"。有趣的事实：参数的大部分和知识的主要存储地都在 FFN 里，注意力层负责"调取"，FFN 负责"加工"
- **× N 层堆叠** ：上述模块重复几十层，逐层抽象——底层抓语法，高层抓语义

**2.1 残差连接：信息的高速通道**

每层都给信息留一条"高速直通道"（输入直接加到输出），防止信息在深层网络中迷路。注意：它解决的是 **梯度消失** ，管不住注意力层里的权重稀释——我们在下一章会看到，残差救不了"失忆"。

**2.2 LayerNorm：稳定每一层的"血压"**

每层输出做归一化（减均值、除标准差），防止数值越算越大或越算越小。可以理解为给网络"稳血压"——不直接影响记忆，但缺了它，深层 Transformer 根本训不动。

**排查结论** ：残差连接和 LayerNorm 是"清白零件"——它们保障训练稳定，但不制造失忆。真正的病灶是金色核心：自注意力。下一章，我们把它拆开看。

## 03

自注意力：软遗忘发动机

**3.1 从一个句子到 QKV**

> “猫 追 球”

三个词，每个词处理时都要回答一个问题： **"我该听谁的话？"** 猫需要知道谁在追它，追需要知道追的是什么，球需要知道谁在追它。这个"听谁的"的决策，就是通过 Q、K、V 三步计算完成的。

很多教程用"图书馆借书"比喻 QKV，但这个比喻容易让人以为 Q、K、V 是三种不同的东西。真相是： **每个词的输入向量，经过三个不同的权重矩阵变换，得到三份"身份证"** 。

![](https://mmbiz.qpic.cn/mmbiz_png/ZRhjO8xAWr6LkJvSs2rRDuutNibnYMV6okqycJAYjjdDJvhV6uLZj6kpibAldH7rjEEdmBrTYiaTQrQicCibj3xrZMgmQNJAQMr44ibJExnXybqMQ/640?wx_fmt=png&from=appmsg)

如上图，同一个词"猫"，乘以 Wq 得到它的 Query（我要找什么），乘以 Wk 得到它的 Key（我有什么标签），乘以 Wv 得到它的 Value（我的实际内容）。三个矩阵都从同一段文字生成，只是"视角"不同。

**3.2 三步计算，与软遗忘的诞生**

![](https://mmbiz.qpic.cn/sz_mmbiz_png/ZRhjO8xAWr6ORp8m2lw0D5G13c8UwJG2WSbgcVG6HiasaVib6uxjdsDGn6djiaaUFXTcm90uck2ic4s0PsC4WahXonzePO0VITUX9A41iaXJP5GY/640?wx_fmt=png&from=appmsg)

**Step 1：Q × K^T = 打分矩阵**

每个词的 Query 去和所有词的 Key 做点积，算出"相关度分数"。上图中圆点越大，分数越高——"猫"和自己最相关，"追"和"球"也高度相关（动宾关系）。

> 为什么用点积？因为两个向量方向越一致，点积越大——方向一致 = 语义相关。这不是人为规定，是向量空间的数学性质。

**Step 2：softmax = 分蛋糕**

把分数变成"百分比蛋糕"—— **每行加起来必须等于 100%** 。这一步是零和博弈的起点：有人份额大，就有人份额小。

> 为什么要除以 √dk？点积的结果会随向量维度 dk 增大而变大，大到 softmax 的梯度几乎为零（函数进入饱和区）。除以 √dk 把数值拉回合理范围，让梯度能正常流动。这不是“调参”，是数学上的必需。

**软遗忘就诞生在 Step 2** 。对话越长，softmax 要分的蛋糕份数越多。一个 1000 轮的对话里，早期词分到的份额被稀释到 0.001 以下——乘以 V 后几乎不被采纳。信息还在窗口里，但注意力权重已经把它淹没。就像开头那张图里褪色的便签——纸还在，字已经看不清了。

上面是理论推导，下面看真实分布——

![](https://mmbiz.qpic.cn/mmbiz_png/ZRhjO8xAWr4QmDtSoI3UJ5DVUuF3SE2YJRVgqCPy3HV24rAOOsiak3Q88XRe3CjTm92J5wtUrIrcgOib0ICzGJhby9ox0xbweheOxichnflbW8/640?wx_fmt=png&from=appmsg)

这是"小猫追毛线球因为它很无聊"的注意力分布。可以看到两件事：

- **"它"那一行，"小猫"格子最深** ——AI 正确猜中指代关系，靠的就是高权重锁定
- 大面积浅色格子——AI"看见"了这些词，但基本没理睬

一句话记住： **遗忘不是删除，而是注意力权重把信息淹没。** 残差连接给的是梯度通道，管不了注意力权重的稀释——正如第二章所预判，残差救不了"失忆"。

继续第三步——

**Step 3：权重 × V = 输出**

按百分比混合所有词的 Value，生成每个词的新表示。以"猫"为例：新表示 = 0.8×V(猫) + 0.1×V(追) + 0.1×V(球)——它主要保留了自己的信息，微微吸收了"追"和"球"的语义。

**三步串起来就是一句话** ：Q 决定"问什么"，K 决定"匹配什么"，softmax 决定"信多少"，V 决定"拿到什么"。

**3.3 多头注意力：多个"专科医生"并行会诊**

自注意力有一个问题：一个头只能学一种关系模式。如果"猫→追"的语法关系和"猫→球"的语义关系冲突，单头注意力只能二选一。

解决方案是 **多头注意力** ：把 Q/K/V 拆成多组（GPT-3 用 96 个头），每组独立做注意力，最后拼接。每个头可以专注于不同的关系模式：

![](https://mmbiz.qpic.cn/sz_mmbiz_png/ZRhjO8xAWr5OUEMDk53k48eVk3m8TkJdurJ3Y8sShibkfsUHxcO3fibUMVbn12sKgyiad2pzLo0zFyCRDh6oPlc8hF0j3cws6O9jQHcnuYWySc/640?wx_fmt=png&from=appmsg)

如上图，同一句"猫追球"进入三个头，各自看到不同的关系：

- **头 1（语法）** ：锁定"猫→追"的主谓关系——谁在追？
- **头 2（语义）** ：锁定"猫↔球"的名词聚类——哪些词是一类？
- **头 3（位置）** ：锁定相邻关系——谁挨着谁？

三个头的输出拼接后，经过 WO 线性变换，融合成统一表示。不是一个大脑袋看所有关系，而是多个专科医生各看一面，最后会诊。

> 实证研究发现，Transformer 的不同注意力头确实会自发学到不同模式：有的盯语法、有的盯共指消解（“它”指代谁）、有的盯位置远近。这种“自发分工”是多头机制的核心价值——不是人为指定，是训练过程中自然涌现的。

软遗忘讲完了——信息还在，但已经不重要了。但还有一种更彻底的遗忘：信息压根没进场。下一章看"硬遗忘"。

## 04

硬遗忘：窗口与 O(n²)

**4.1 窗口截断：比淹没更彻底**

Softmax 稀释好歹是"看见了但没重视"，还有一种更彻底的遗忘—— **上下文窗口截断** 。

Transformer 能"看见"的 token 数量是固定的（早期 4K，现在主流 128K，最长约 1M）。超出窗口的内容，不是被遗忘，而是 **从未参与计算** ——物理上不存在。

![](https://mmbiz.qpic.cn/sz_mmbiz_png/ZRhjO8xAWr4M0lCa5J8vJ05YQTUot3cUVE1RxiaOLGy9nJZCTBC7ibQeWLmmX3hMey7icaW8VM0mS9DppUUxU1zD12oDWtrUesbOBpPADVXMibs/640?wx_fmt=png&from=appmsg)

回到开头的案例：你第 1 轮说"我家猫叫团子"，聊到第 50 轮问"我的猫叫啥"，AI 答你"您还没告诉过我您养猫呢"。它不是撒谎—— **第 1 轮的内容压根没进入这一次的计算** 。

**4.2 为什么窗口不能无限大？O(n²) 的暴政**

注意力的计算量随序列长度 **平方增长** ：每个词都要和所有其他词两两配对（Q × K^T 矩阵）。

![](https://mmbiz.qpic.cn/mmbiz_png/ZRhjO8xAWr6tEaF4JENVrODaretfZFAibc2icqA06G1iaoUsYGiaI0IicDF4RfyCu214OwLFdp0fght1N3ibGZdzAbPzMfG44TYSdWb8icEADxqlsk/640?wx_fmt=png&from=appmsg)

为什么是平方而不是线性？因为 RNN 的计算量是 O(n)——每个词只跟前一个词交互；Transformer 让所有词两两交互，计算量跳到 O(n²)。并行赢了速度，但输给了规模——这就是窗口不能无限大的根源，也是后续一切优化的起点。

工程师的一切优化（Flash Attention、KV Cache、RAG），本质上都是在和这个 O(n²) 博弈。

## 05

两次取舍：一眼看全场，与不偷看未来

**5.1 串行 vs 并行：一眼看全场**

![](https://mmbiz.qpic.cn/mmbiz_png/ZRhjO8xAWr70EuJrmI1hhR3rNf9axVKRyrDUnlDapZsL0T5icPOXOx2FacDPHO638qnSPcrulIBIzzVwwbcP77ZX9PUPhXadpAYmM68tx3DA/640?wx_fmt=png&from=appmsg)

如上图，RNN 处理"猫追球"必须串行：先读"猫"算出隐状态，传给"追"，再传给"球"——每个词必须等前一个词算完。这带来两个致命问题：

- **训练慢** ：无法并行利用 GPU，序列越长越慢
- **长距离衰减** ：信息从第 1 个词传到第 100 个词，要经过 99 次传递，每次乘以一个权重，信号不断衰减——就像传话游戏，传到最后面目全非

Transformer 的革命性在于： **所有词同时入场，一步内互相看见** 。"猫"可以直接和"球"做点积，不需要经过"追"中转。这不仅让训练可以大规模并行（GPU 友好），还让任意距离的两个词之间 **没有信号衰减** 。

> 这就是论文标题 Attention Is All You Need 的底气——砍掉 RNN 的串行循环，只用注意力实现全局直连，既快又准。

代价就是上一章算过的那笔 O(n²) 账单——并行赢了速度，但窗口不能无限大。这是一次取舍：用计算复杂度换并行能力和零衰减。

**5.2 因果掩码：不偷看未来**

第二个取舍关于生成。到目前为止我们讲的都是"理解"场景——所有词都已给出，注意力让它们互相看。但 GPT 的核心任务是 **生成** ：一个词一个词往外蹦。这就带来一个问题——生成第 3 个词时，第 4、5、6 个词还不存在，AI 不能"偷看"未来。

解决方案是 **因果掩码（Causal Mask）** ：在注意力矩阵的上三角（未来位置）填上 −∞，softmax 后变成 0，等价于"假装那些位置不存在"。

![](https://mmbiz.qpic.cn/sz_mmbiz_png/ZRhjO8xAWr6FtYrknXwAvKGAIN3Qia7gxX9dUDCSM7XQBy1TpnJ0q4gZhA2FxOuJfod0o9fYFp7Y2rBntxymg3nbZupEQ0mrRFZuVibS4NZYE/640?wx_fmt=png&from=appmsg)

如上图，生成"球"时，注意力只能看见"猫"和"追"——上三角的格子被屏蔽（打叉），不参与计算。

这个掩码机制区分了两种 Transformer 架构：

- **Encoder（编码器，如 BERT）** ：双向注意力，每个词可看全部词。适合 **理解** 任务——分类、填空、相似度判断
- **Decoder（解码器，如 GPT）** ：因果掩码注意力，只能看 ≤ 自己的位置。适合 **生成** 任务——写文章、写代码、对话

GPT 系列只用 Decoder——所以它天生只能"从左往右逐词生成"，这也意味着它生成第 N 个词时，无法回头修改前 N-1 个词。这是第二次取舍：用单向性换取自回归生成能力。

> 屏蔽的数学本质：设被屏蔽位置的分数为 −∞，softmax 中 e^{−∞} = 0，权重归零。一行物理直觉：你不能让未来的信息“泄漏”到当前步，否则训练时模型会作弊（直接抄答案），推理时则无答案可抄，行为崩坏。

## 06

失忆治疗手册

开药之前，先看诊断书——两种遗忘的完整对照：

![](https://mmbiz.qpic.cn/mmbiz_png/ZRhjO8xAWr5oM8AuVTIW3M7Jr7GxTmjTXfPBunicLKERknzXvvuUsTr9cYXRW0RgLpDicRaWGXo9Jp7DWpibiarQfvNs7oZr2zOmrf3XTlyFXYU/640?wx_fmt=png&from=appmsg)

**选择性失忆 = 工作记忆轨道的宿命** ：软遗忘（softmax 稀释）+ 硬遗忘（窗口截断），二者叠加，构成了 AI "忘事"的完整图景。

病因明确（softmax 稀释 + 窗口截断 + O(n²)），药方对症：

**6.1 药方一：扩窗口（治硬遗忘）**

从 GPT-1 的 512 到如今百万级 tokens，本子越扩越大。但 O(n²) 在那里，扩窗口 = 烧钱，成本随长度平方增长。

**6.2 药方二：KV Cache（省算力）**

已算过的 Key/Value 缓存复用，不重复计算。不解决遗忘，但让大窗口在工程上可行。

**6.3 药方三：RAG（外包记忆）**

![](https://mmbiz.qpic.cn/mmbiz_png/ZRhjO8xAWr6qt6p0UDQMrEiaIuCjiaUU5FYsIjAQGIRgP1xqkofBS4vOmsn0tLCQoZ1YN3b1akMLEKXro1EpJTcicbJIz6Rao8EJTtDFRKXBQo/640?wx_fmt=png&from=appmsg)

不指望模型"记住"，而是每次回答前先去外部知识库 **检索** 相关资料，塞进上下文窗口。相当于把"长期记忆"外包给数据库，AI 只需要"这次看得见"。这是当前企业级 AI 应用（包括 KM 里的智能问答）的主流方案。

**6.4 药方四：注意力变体（改游戏规则）**

Flash Attention（同样的数学，更聪明的算法规避内存瓶颈）、Sparse / Linear Attention（打破 O(n²)，只算值得算的部分）。长期看，这是最根本的路线。

## 07

写在最后：失忆是特性，不是缺陷

回到开头的问题：AI 的"选择性失忆"是 bug 吗？

现在你可以回答了： **它是注意力机制的必然代价** 。softmax 的零和博弈让 AI 能在无穷信息中聚焦最相关的部分——如果每个词都平均关注所有词，它反而什么都学不会。遗忘，是聚焦的价格。

> Transformer 的记忆哲学：参数记忆负责“我知道什么”，注意力记忆负责“我现在关心什么”。前者给你知识，后者给你语境；而“失忆”，只是后者为了让你清醒而付出的代价。

理解了这一层，你就理解了 RAG、长上下文、KV Cache、Flash Attention 这些热门技术到底在解决什么问题——它们都是在这条"注意力经济"的约束下，帮 AI 把有限记忆花在刀刃上的不同策略。

\-End-

原创作者｜朱进

感谢你读到这里，不如关注一下？👇

![](https://mmbiz.qpic.cn/mmbiz_png/VY8SELNGe95UnhD9f7ia4T3ufXM1liaxxffiaEy41n0icohEC2qDS05icapaN4iaTVfsClibPRmqOjNW6q33PZicAVoSOg/640?wx_fmt=png&from=appmsg&wxfrom=5&wx_lazy=1&wx_co=1&tp=webp#imgIndex=4)

扫码领取腾讯云开发者专属服务器代金券！

![图片](https://mmbiz.qpic.cn/mmbiz_png/ZRhjO8xAWr4nU3obq4B4URKhzJMmibw1uR1ZehOtyeel5hYevARgDqdKxqXvtzclLhu7g28g6PBib8M2uaQegic6MrCdBic0SdHh4XUQODQkmKk/640?wx_fmt=png&from=appmsg&tp=webp&wxfrom=5&wx_lazy=1#imgIndex=16) ![](https://mmbiz.qpic.cn/mmbiz_png/VY8SELNGe979Bb4KNoEWxibDp8V9LPhyjmg15G7AJUBPjic4zgPw1IDPaOHDQqDNbBsWOSBqtgpeC2dvoO9EdZBQ/640?wx_fmt=other&wxfrom=5&wx_lazy=1&wx_co=1&tp=webp#imgIndex=7) ![](https://mmbiz.qpic.cn/mmbiz_png/VY8SELNGe95pIHzoPYoZUNPtqXgYG2leyAEPyBgtFj1bicKH2q8vBHl26kibm7XraVgicePtlYEiat23Y5uV7lcAIA/640?wx_fmt=other&from=appmsg&wxfrom=5&wx_lazy=1&wx_co=1&tp=webp#imgIndex=11)

不喜欢

知道了

微信扫一扫  
使用小程序

： ， ， ， ， ， ， ， ， ， ， ， ， 。 视频 小程序 赞 ，轻点两下取消赞 在看 ，轻点两下取消在看 分享 留言 收藏 听过