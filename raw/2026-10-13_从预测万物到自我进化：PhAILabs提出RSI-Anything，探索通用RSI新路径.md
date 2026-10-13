# 从预测万物到自我进化：PhAI Labs提出RSI-Anything，探索通用RSI新路径

**作者**: 机器之心（发布方）

**来源**: https://mp.weixin.qq.com/s/zEt5cu_6gPXUdh25iers_Q

---

## 摘要

PhAI Labs 提出 RSI-Anything 框架，通过世界模型预测行动后果并结合真实反馈实现跨领域递归自我改进，在代码修复、计算机界面操作、实验室规划和化学反应优化等任务中均显著提升性能，探索了从数字任务走向物理与科学世界的通用 RSI 新路径。

---

## 正文

![图片](https://mmbiz.qpic.cn/sz_mmbiz_png/KmXPKA19gW889cR13aBX42evqQIRibKlicoCrHPEpT0tQiceNphESCa2eJTqstP8G0yqMTkeMFrOGue6kOyCKdTkA/640?wx_fmt=png&from=appmsg&tp=webp&wxfrom=5&wx_lazy=1#imgIndex=0)

机器之心发布

修 Bug、操作计算机、规划实验室操作、优化化学反应，甚至研究复杂的免疫系统。

这些看起来八竿子打不着的任务，最近却出现在了同一个 AI 自我进化研究框架中。

更有意思的是其中的实验结果。

在代码修复任务中，研究者没有更换负责写代码的模型，也没有增加在线测试预算，只是让世界模型参与预测和选择代码修改方案，并利用真实反馈进一步适配预测器。

结果，代码修复成功率从 26.3% 提升到了 31.2%。

而当 AI 从编写代码走向实际操作计算机，面对不断变化的屏幕界面，需要连续完成点击、输入和窗口操作时，这套方法同样展现出了效果。

在计算机图形界面交互任务中，RSI-Anything 在 OSWorld 基准上实现了任务成功率相比原有方法相对提升约 18.4%。

进一步来到实验室，一个仅有 4B 参数的策略模型，经过连续五代改进，规划分数从 21.80% 提升至 46.01%，最终略微超过了采用更大模型组合的参考系统。

到了化学世界，同样进行 40 次实验，预测与反馈驱动的搜索将平均最佳观测产率推进至 96.15%，而贝叶斯优化对照方法为 82.16%。

从修复程序中的 Bug，到操作真实的软件界面，再到规划实验流程、选择化学反应条件。

这些任务的状态形式、行动空间与反馈机制截然不同，却都可以被组织进同一套预测与反馈驱动的改进框架中。

这就引出了一个值得思考的问题：

AI 的递归自我进化，为什么一定要局限在代码、数学或者某一种特定任务里？

Recursive Self-Improvement（RSI）正在成为 AI 研究的重要方向。但要让 AI 真正从代码、数学等数字任务，走向需要连续交互的计算机环境乃至复杂的物理与科学世界，仅仅依赖明确的测试结果和奖励信号还不够。

不同环境中的状态变化和行动后果往往更加复杂，而真实世界的反馈还可能更加昂贵、稀疏，甚至难以直接获得。

如果 AI 能够为不同世界建立预测模型，在真正行动前预判可能的后果，再利用真实反馈不断改进自身呢？

10 月 12 日，PhAI Labs 发布 RSI-Anything: Unlocking Recursive Self-Improvement with World Models 技术报告，探索一条通过世界模型实现跨领域递归自我改进的路径。

![](https://mmbiz.qpic.cn/sz_mmbiz_png/5L8bhP5dIqE0wAwYCZ660ugAibBKXbK7P0WHP53outSibGJ2o303dHV9QcTTs22SIAlD2U4nxGA5hH4hMouFRfTGibgggCQBdoibmcZhEKv3iaso/640?wx_fmt=png&from=appmsg)

这项研究延续了此前 JEPA-Anything 的技术路线。

JEPA-Anything 探索如何通过通用预测学习原则，建模视觉、分子、物理、生命等不同世界的变化规律。

RSI-Anything 则进一步追问：

当不同世界变得可预测，能否让这些世界成为 AI 自我进化的环境？

从 World Modeling Anything，到 Recursive Self-Improvement through Anything。

这一次，世界模型不再只是用于预测未来，而是进一步成为连接不同环境与智能自我进化的关键组件。

- RSI-Anything 技术报告：https://arxiv.org/abs/2610.13912
- RSI-Anything 项目代码：https://github.com/Gen-Verse/RSI-Anything
- JEPA-Anything 论文：https://arxiv.org/abs/2609.20800
- JEPA-Anything GitHub：https://github.com/Gen-Verse/JEPA-Anything
- PhAI Labs 官网：https://phai-labs.com/

01 从建模万物，到让万物推动 AI 进化

要让 AI 在不同环境中持续自我改进，首先需要解决一个问题：如何理解行动可能产生的后果？

在代码世界，运行测试就能获得相对明确的反馈。但在化学实验中，改变一个反应条件可能需要真实实验；在生物系统中，一次干预甚至可能引起复杂的多尺度变化。

如果每一次学习都必须依赖真实试错，AI 能够探索的空间就会受到明显限制。

世界模型提供了另一种可能：让 AI 先学习环境中的变化规律，再利用预测辅助行动选择。

此前，PhAI Labs 提出的 JEPA-Anything，已经在视觉、生物、临床、控制、分子动力学、物理场和天气七类领域中探索了统一预测学习机制。

其核心方法 OPF（正交预测分解），通过将复杂状态拆解为互补的预测因子，学习不同系统中的变化规律。

相关研究甚至展示了从肿瘤干预分析到行星轨道规律提取的跨领域应用。

但预测世界，只是第一步。

即使世界模型能预测行动后果，也不代表 Agent 一定知道如何选择、如何学习，更不代表它能持续改进。

RSI-Anything 正是尝试跨越这一步：将世界模型的预测能力，与 Agent 的行动选择、真实反馈和系统更新连接起来。

不同世界不需要共享完全相同的数据或模型参数，却可以共享一套底层改进机制。

![](https://mmbiz.qpic.cn/sz_mmbiz_jpg/5L8bhP5dIqHga99qnaawmxlANZTq28GibpsFic1C7BtylDgDeKjMZ2vNnSlLOsWK54hB83WiaTgC87GVXtSKuI0ur2EZhphxWX8Dyxia48Oj4s4/640?wx_fmt=jpeg&from=appmsg)

图 1｜从 JEPA-Anything 的跨领域预测学习，到 RSI-Anything 的递归改进框架

02 RSI-Anything：世界模型与 Agent 如何形成递归改进？

利用世界模型辅助决策，并不是新概念。

从 Model-Based RL 到 Dreamer、MuZero，AI 已经能够借助环境预测进行规划和学习。

RSI-Anything 进一步关注的是：如何让预测、行动、真实反馈，以及策略和世界模型自身的更新，构成一个可以跨领域复用的递归过程？

其核心流程可以概括为：

State → Action → Prediction → Feedback → Improvement

首先，Agent 生成候选行动，世界模型预测不同选择可能产生的后果，帮助系统决定哪些方案更值得执行。

真实执行后，反馈不仅用于解决当前任务，还可以继续支持策略学习、工作流修订或世界模型适配。

而这里存在一个容易被忽略的问题。

当 Agent 的策略更新后，它可能探索过去从未接触过的状态；原来准确的世界模型，未必还能可靠预测新的行动。

反过来，世界模型更新后，也可能改变 Agent 对候选行动的判断。

Agent 改变探索世界的方式，世界模型则需要不断适应这些变化。

为此，RSI-Anything 允许 Policy 与 World Model 异步更新，并引入组件评估和兼容性检查。

不是每一次更新都被直接接受。只有通过相应检验的策略与世界模型组合，才会被保留，成为下一轮改进的起点。

这样，系统不只是利用反馈修正当前答案，而是尝试将经验转化为能够持续影响后续行动与学习的能力。

![](https://mmbiz.qpic.cn/sz_mmbiz_png/5L8bhP5dIqFXGJverLiaRuSicvuiaWdj37P3Y2MkutdApzVBsXcbyEyQjAVz32RqykC6GQgJmKlQB7NPqaHBSiaw0uiaCqRiadJhdlKobvKnntdMg/640?wx_fmt=png&from=appmsg)

图 2｜RSI-Anything 总体框架，突出预测选择、反馈更新、Policy–World Model 兼容性检查及递归循环

03 从 Coding Agent 到 GUI Agent，再到 Science：不同世界中的 RSI 实验

方法能否称得上 Anything，关键在于它能否跨越不同的任务与反馈形式。

研究团队分别在代码修复、图形界面交互、实验室规划和化学反应优化中，验证了 RSI-Anything 的不同机制。

（1）Code：不升级 Coder，也能修好更多 Bug

在 CodeContests 代码修复实验中，研究者固定 ReasonFlux-Coder-7B，每轮生成四个候选 Patch，再选择一个执行。

不同方法使用相同的代码生成器与候选预算。

结果，静态 Verifier 的修复成功率为 26.3%；引入固定世界模型后提升至 29.2%；进一步通过执行反馈适配世界模型后，达到 31.2%。

与此同时，平均在线测试调用次数基本维持在每道任务 3.7 次左右。

这说明，提升 Agent 的能力，并不一定只能依赖更强的生成模型或更多真实试错。

让世界模型更准确地判断哪些行动值得执行，同样能够提升系统表现。

![](https://mmbiz.qpic.cn/mmbiz_png/5L8bhP5dIqHXsEQibvBtfF6icrC0uzn4FQX0VnPaYSXAedLuSheRyIV7KejcylOwafMZoD1LtcPfcAoEu6vSl2dTwfANpSPibz9OUXBGghx3S8/640?wx_fmt=png&from=appmsg)

图 3｜代码修复任务的性能对比配图

（2）GUI Agent：从代码生成走向计算机交互

除了代码修复，RSI-Anything 还进一步探索了图形用户界面（GUI）智能体的能力改进。

与代码任务不同，GUI Agent 需要理解屏幕中的视觉信息，通过鼠标、键盘等操作与环境交互。每一步操作都可能改变界面状态，对智能体的环境理解与连续决策能力提出了更高要求。

在具有代表性的计算机操作基准 OSWorld 上，RSI-Anything 实现了任务成功率相对提升约 18.4%，展现出在复杂图形界面交互任务中的应用潜力。

这一结果进一步表明，RSI-Anything 的应用范围不仅局限于代码生成，也能够拓展到需要持续观察、行动与环境交互的智能体任务中。

![](https://mmbiz.qpic.cn/mmbiz_png/5L8bhP5dIqHuOBu5JBgX8HhY8cbSqrhERBK5SHzntkLOr4jaexZGWVBRAC4SEc1aLh0lBd7yQWhvosico7aOn0AWoVNjzkHrD0zoJ5gGFDfc/640?wx_fmt=png&from=appmsg)

图 4｜GUI 任务完成情况及动作行为

（3）Laboratory：4B 模型连续五代改进，规划分数翻倍

在 LabHorizon 实验室规划任务中，研究团队考察了一个 4B 策略模型连续五个版本的表现。

其规划分数依次为：

21.80% → 38.03% → 41.99% → 44.56% → 46.01%

最终版本达到初始分数的约 2.1 倍，并略高于 Actor–Simulator–Selector 参考系统的 45.32%。

这一结果展示了系统持续保留策略更新、逐步改善复杂实验规划的潜力。

需要注意的是，这里衡量的是实验协议规划质量，而非真实湿实验的执行成功率。

![](https://mmbiz.qpic.cn/mmbiz_png/5L8bhP5dIqERVzoibIhQPR4QfdZp3ImH19KpQoTztnsZdajA0tjnu96oRicA2gpzfic8ZSoKSsmw5V77WtlRcK38RCkhicKN0wxZX3AuPmeLHMc/640?wx_fmt=png&from=appmsg)

图 5｜实验室规划任务的策略迭代结果

（4）Chemistry：40 次实验，找到更高产率的反应条件

在化学反应优化中，RSI-Anything 使用世界模型预测不同催化剂、配体、溶剂等条件组合可能产生的结果，再结合真实测量反馈选择下一轮实验。

在两组 Suzuki–Miyaura 反应筛选任务中：

- 20 次实验后，最佳观测产率达到 93.0%，高于贝叶斯优化的 87.5%。
- 40 次实验后，平均最佳观测产率达到 96.15%，高于贝叶斯优化的 82.16%。

对于实验预算有限的科学研究，这意味着同样的实验次数，有机会获得更好的探索结果。

从代码测试、图形界面交互，到实验规划和化学产率测量，四类任务的状态、行动与反馈机制各不相同。

但它们共同展示了一个方向：

不同世界中的预测与反馈，可以通过相似的底层机制，被用于改善智能系统的决策与学习。

![](https://mmbiz.qpic.cn/mmbiz_png/5L8bhP5dIqGsWjfkyHNKliaLBE8ibc3l5ib0pRYWjtr7Y7CITd6Cp7ORpTAHzCTd36pEjWQZ0v4tNDEAlzEyCvlVTLtJShibglAE74zd7GjTlsA/640?wx_fmt=png&from=appmsg)

图 6｜化学反应优化任务的实验结果对比

04 从解决问题到探索未知：当 RSI 遇见免疫科学

如果代码和化学实验主要关注如何提高已有任务的表现，那么免疫科学则将 RSI-Anything 带到了更加开放的研究流程中。

免疫系统涉及细胞、组织和个体等不同尺度。相同干预在不同免疫背景下，也可能产生截然不同的结果。

此前，PhAI Labs 相关研究提出 EvoIWM（Evolutionary Immune World Model），尝试构建能够预测多尺度免疫状态变化和干预后果的世界模型。

在 RSI-Anything 展示的端到端应用中，研究团队利用 Agent Genesis 演化科学 Agent 工作流，构建免疫世界模型，再通过模型驱动的分析、证据检验和自我修正，筛选潜在干预方案。

研究最终提出了涉及 SIRPα 抑制与 IL-36γ 轴调节的候选联合干预假设，仍有待后续实验验证。

这里，世界模型已经不只是预测一次行动的结果。

它开始成为科学 Agent 分析复杂系统、比较干预方案和修正研究判断的工具。

这也带来一个更具想象力的方向：

当 AI 能够学习不同世界的变化规律，它是否不仅能改进解决问题的能力，还能进一步参与发现值得研究的新问题？

![](https://mmbiz.qpic.cn/sz_mmbiz_png/5L8bhP5dIqGVOB5Ag1l6wvg56UeKZfy62iajsv6z0WYXKPKtEzKyoPyzfuECzhIWdicw2Z6ukT0qCfoGWh65fnWv61pG8aVVcyAwOtTDIhzfk/640?wx_fmt=png&from=appmsg)

图 7｜免疫科学研究中的工作流演化与世界模型应用

05 Anything：让整个世界成为智能进化的训练场

回看 JEPA-Anything 与 RSI-Anything，两项研究实际上沿着一条技术路线推进。

JEPA-Anything 尝试建立跨领域的预测学习机制，让 AI 学习不同世界如何变化。

RSI-Anything 则进一步将预测与真实行动、外部反馈和系统更新连接起来，探索跨领域复用的递归自我改进框架。

这里的 Anything，并不意味着一个世界模型已经能够理解万物，或者一个 Agent 已经可以在任意环境中自主进化。

真正试图统一的，是不同世界中从预测、交互到自我改进的底层机制。

当然，当前研究分别验证了预测选择、模型适配、策略迭代与反馈驱动搜索等不同环节。让策略与世界模型在同一个复杂环境中长期、稳定地协同进化，仍是后续需要验证的目标。

但这条路线所指向的空间，并不局限于某一个 benchmark 或科学领域。

未来的智能系统，将不断面对新的任务、新的环境和新的失败模式。能否从这些变化中持续获得学习信号，可能是进一步提升智能能力的重要问题。

而世界模型提供了一种潜在的基础：让复杂环境变得可预测，让真实反馈能够用于校正判断，再让经过验证的改进影响后续的学习和行动。

从代码到图形界面，从数字环境到物理世界，再到复杂的科学探索。

科学也不只是 RSI 的一个垂直应用。由于包含复杂环境、昂贵反馈与大量未知问题，它可能成为检验智能系统自我进化能力上限的重要训练场。

从 World Modeling Anything，到 Recursive Self-Improvement through Anything。

JEPA-Anything 探索如何让 AI 预测不同世界，RSI-Anything 则进一步探索，如何让这些世界中的预测与反馈成为持续改进智能系统的资源。

从建模万物，到让万物推动智能进化。

© THE END

转载请联系本公众号获得授权

投稿或寻求报道：liyazhou@jiqizhixin.com

不喜欢

知道了

微信扫一扫  
使用小程序

： ， ， ， ， ， ， ， ， ， ， ， ， 。 视频 小程序 赞 ，轻点两下取消赞 在看 ，轻点两下取消在看 分享 留言 收藏 听过