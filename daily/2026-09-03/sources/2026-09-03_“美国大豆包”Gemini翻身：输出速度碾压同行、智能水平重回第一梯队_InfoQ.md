---
publish_time: 1788402665
link: https://mp.weixin.qq.com/s/Wo2nnScSOJkQ_w76L_iCPw
source: InfoQ
status: confirmed
category: 国际
is_model_related: true
digest: |
  InfoQ解读Gemini 3.8 Flash：六周内第三款Flash，Artificial Analysis智能指数59分，与GPT-5.6 Sol、Grok 4.6持平，DeepSWE v1.1长程软件工程登顶。输出速度约300 token/秒，为多数主流模型4至6倍。Google未直接做成缩小版Pro，而是让模型多思考、多调工具、多轮次，加权生成时间更长但智能回升，被戏称美国大豆包翻身。
title: “美国大豆包”Gemini翻身：输出速度碾压同行、智能水平重回第一梯队
---

# “美国大豆包”Gemini翻身：输出速度碾压同行、智能水平重回第一梯队

来源：InfoQ
原文链接：https://mp.weixin.qq.com/s/Wo2nnScSOJkQ_w76L_iCPw

作者 | Tina
过去几个月，Gemini 在中文互联网上多了一个颇具杀伤力的外号：“美国大豆包”。
这个称呼吐槽的，是 Gemini 身上长期存在的反差：发布会上基准成绩漂亮、上下文窗口巨大、免费额度充足，真正用起来却偶尔理解跑偏，一本正经地给出错误答案。被用户指出问题后，它还可能先送上一大段夸奖和道歉，情绪价值给得很足，事情却没有办好。
在 Gemini 3.5 Flash 发布后，这种调侃一度升级为：“这是最快告诉你错误答案的 AI。”
如今，Google 带着 Gemini 3.8 Flash 回来了。这是其六周内推出的第三款 Flash，也是不到四个月内的第四次 Flash 更新。新模型在 Artificial Analysis Intelligence Index 上获得 59 分，与 xhigh 档位下的 GPT-5.6 Sol 和 medium 档位下的 Grok 4.6 持平；在 DeepSWE v1.1 上，它甚至超过大多数体量更大的前沿模型，登上长程软件工程榜首。
更关键的是，Gemini 3.8 Flash 仍能保持每秒约 300 Token 的输出速度，约为许多主流模型的 4—6 倍。
“美国大豆包”这次似乎真的变聪明了。Google 没有直接把 Flash 做成一款缩小版 Pro，而是让模型思考更多、反复调用工具、执行更多轮次，并为此消耗更多 Token。
一款模型可以拥有极高的 Token 输出速度，每项评测任务的加权生成时间却比上一代更长。理解这组看似矛盾的数据，才是理解 Gemini 3.8 Flash 的关键。
Flash 冲进第一梯队
自 2026 年初以来，Google 一直没有发布前沿级别的 Gemini Pro 模型。
原本承诺在今年 6 月推出的 Gemini 3.5 Pro 至今没有出现，据称原因之一是它的编程能力未能达到 Google 的预期。8 月初，Google DeepMind 的管理层也发生变化。Demis Hassabis 卸任 CEO、转任董事长，Koray Kavukcuoglu 接过管理工作，职衔则变成了高级副总裁。Google CEO Sundar Pichai 随后试图安抚外界，但这并没有完全消除市场的疑虑：Google 是否还准备继续争夺前沿模型的最高位置？
与此同时，Flash 系列进入了高速迭代。Gemini 3.5 Flash、3.6 Flash、3.7 Flash 和如今的 3.8 Flash 接连发布，Google 更新低价模型的速度，已经超过其他实验室迭代同类产品的速度。
Flash 原本是 Google 模型家族里的经济型产品线，主打低成本和高速度，能力通常低于 Pro 系列。到了 Gemini 3.8 Flash，这条边界已经开始模糊。
开启高推理档位后，Gemini 3.8 Flash 在 Artificial Analysis Intelligence Index 上获得 59 分，比上一代提高 3 分。它与 xhigh 档位下的 GPT-5.6 Sol、medium 档位下的 Grok 4.6 持平，距离最高档位下的 GLM-5.3 和 Kimi K3 只有 1 分，距离最高档位下的 GPT-5.6 Sol 和高档位下的 Grok 4.6 也只有 2 分。
再往上，Claude Opus 5 获得 63 分，Claude Fable 5.1 以 66 分位居榜首。Gemini 3.8 Flash 没有拿下绝对最高分，却已经进入当前第一梯队。
Google 暂时没有依靠 Pro 重返模型能力的最前沿，却让 Flash 回到了帕累托前沿：在当前市场上，很难找到一款智能水平比它更高、成本又比它更低的模型。
Token 单价没涨，完成任务却贵了 40%
今年年底前，Gemini 3.8 Flash 将沿用上一代的 API 推广价格：每百万输入 Token 0.75 美元，每百万输出 Token 3.75 美元，缓存输入则按正常输入价格的 10% 计费。优惠期结束后，价格将翻倍，恢复至每百万输入 Token 1.50 美元、每百万输出 Token 7.50 美元。
按照 Artificial Analysis 的测算，高推理档位下的 Gemini 3.8 Flash 完成一项 Intelligence Index 评测任务，平均成本为 0.58 美元，是该机构测得的同等智能水平中最便宜的模型。
作为对比，Anthropic 最新的通用旗舰模型 Claude Fable 5.1 完成同类任务约需 3.76 美元，成本是 Gemini 3.8 Flash 的 6 倍以上。最高推理档位下的 GPT-5.6 Terra，单任务成本为 0.53 美元，与 Gemini 3.8 Flash 接近，但智能水平得分为 57 分，比后者低 2 分。
Gemini 3.8 Flash 的 Token 单价没有上涨，单任务成本却比 Gemini 3.7 Flash 高出约 40%，从 0.40 美元增至 0.58 美元。在 Artificial Analysis 的 Intelligence Index 评测中，新模型每项任务的加权平均输出 Token 增长 30%，达到约 4.8 万个，同时在智能体评测中执行了更多轮次。
Google 将这种变化形容为“3.8 Flash works harder”。面对复杂任务时，它会增加推理步骤、反复调用工具，并可能在较高推理档位下消耗更多 Token，以换取更好的最终结果。
它消化这些额外计算的关键，正是速度。Artificial Analysis 测得，Gemini 3.8 Flash 在高推理档位下平均每秒输出约 305 个 Token，是榜单第二名 Meta Muse Spark 1.2 的两倍左右，后者为每秒 154 个 Token。
GPT-5.6 Luna 以每秒 126 个 Token 位居其后，Nemotron 3 Ultra 和 DeepSeek V4 Pro 0813 分别为每秒 112 个和 80 个 Token。相比之下，Claude 系列模型在榜单上的位置明显靠后：启用 fallback 的 Claude Fable 5.1 每秒输出 66 个 Token，Claude Opus 5 则为每秒 56 个 Token，还不到 Gemini 3.8 Flash 的五分之一。
由于输出 Token 增加了 30%，Gemini 3.8 Flash 在这套评测中的单任务加权生成时间仍从 2.2 分钟升至 2.5 分钟，增幅约 14%。这项指标只统计模型生成输出所需的时间，不包含首 Token 延迟和其他系统开销，不能直接等同于 Agent 完成整项工作的真实耗时。
换句话说，3.8 Flash 吐 Token 更快，却也生成了更多 Token。300 TPS 抵消了部分额外 Token 带来的时间开销，但没有让加权生成时间继续缩短。
这也说明，评价 Agent 模型只看 Token 单价已经不够。模型为了完成任务会生成多少 Token、执行多少轮，以及能以多快的速度消化这些 Token，共同决定了最终的成本与等待时间。
提高的 3 分，主要来自 Agent 能力
Gemini 3.8 Flash 在 Intelligence Index 上提高的 3 分，主要来自智能体评测。Artificial Analysis 认为，贡献最大的项目包括衡量工具使用能力的τ³-Banking、衡量编程能力的 Terminal-Bench v2.1，以及测试现实世界高经济价值任务的 GDPval-AA v2。其中，τ³-Banking 提高 12 个百分点，达到 45%。
在 Artificial Analysis 自建的 AA-Briefcase 知识工作评测中，Gemini 3.8 Flash 获得 1213 的 Elo 评分，比上一代提高 79 分。这部分进步主要来自更高的任务要求达成度和更强的分析质量，输出呈现方式没有明显变化。
Google 公布的结果也显示，Gemini 3.8 Flash 在长程软件工程评测 DeepSWE v1.1 中超过大多数体量更大的前沿模型。在 DeepSWE 当前公布的结果中，它与 Claude Opus 5 均为 74%，并列第一；平均任务成本为 2.36 美元，约为 Claude Opus 5 的五分之一。
这一结果也与 Google 所说的“更加努力”相呼应：面对复杂任务时，模型会增加推理步骤、反复调用工具，并在必要时使用更多 Token。
不过，它在计算机操作上的提升相对有限。Gemini 3.8 Flash 在 OSWorld-2.0 上的成绩虽然超过 3.7 Flash，与 Claude Opus 仍有较大差距。
“美国大豆包”真的翻身了吗？
Gemini 3.8 Flash 拥有 100 万 Token 的上下文窗口，支持文本、图像、视频和语音输入，输出目前仍限于文本。开发者可以通过 Google Antigravity、Google AI Studio 和 Android Studio 中的 Gemini API，以及界面设计服务 Stitch 使用它；企业客户可以通过 Gemini Enterprise 接入；Google AI Pro 和 Ultra 订阅用户则可以在 Gemini 应用、Google 搜索的 AI Mode 和 Google Sheets 中调用该模型。
Google 还同步推出了 Gemini 3.8 Flash Cyber，一个专门针对软件漏洞发现与修复进行调优的版本。它目前只向受信任的测试者、政府机构、关键基础设施组织和部分软件维护者开放。
Google 称，Gemini 3.8 Flash Cyber 能够发现更多漏洞，生成有效补丁的成功率也更高。Chrome 安全团队使用新模型后，补丁准确率提升至原来的 2.6 倍；Google Cloud 团队则表示，新模型只用了两个小时便发现了一个严重漏洞。
从通用 Agent、长程软件工程到网络安全，Flash 已经逐渐从 Google 模型家族中的经济型选项，变成了真正承担生产任务的主力。
至于“美国大豆包”是否已经翻身，基准测试只能回答一半。59 分证明它进入了第一梯队，DeepSWE 榜首证明它的编程和 Agent 能力取得了实质进步，0.58 美元的单任务成本则让它重新站上了性价比前沿。
剩下的一半仍要交给真实使用。Google 需要证明，Gemini 3.8 Flash 增加的 Token 和工具调用真正提高了任务成功率，而不是用更长的过程制造更昂贵的错误。
但至少这一次，“最快告诉你错误答案的 AI”已经开始把速度用在更有价值的地方。Gemini 3.8 Flash 每秒依然能够输出约 300 个 Token，只是它不再满足于最快给出一个答案，而是试图成为最快把任务做完的模型之一。
参考链接：
https://www.theregister.com/ai-and-ml/2026/09/02/with-gemini-38-flash-google-reminds-everyone-its-still-in-the-race/5294049
https://artificialanalysis.ai/articles/gemini-3-8-flash
https://arstechnica.com/ai/2026/09/google-releases-gemini-3-8-flash-its-third-flash-model-in-six-weeks/
声明：本文为
InfoQ 整理，
不代表平台观点，也不构成投资建议，未经许可禁止转载。
今日好文推荐
把 FDE 送进企业之后：谁救火，谁背责，谁赚钱？
坚决不用行业标准AGENTS.md，Claude Code惹来“封杀令”：Anthropic终于回应了，但开发者更气了
最强编码模型 Fable 5.1 发布：性能翻倍、Agent 成本降 45%，Anthropic 把顶级模型送进真实世界
Claude 越狱后，Anthropic 停掉训练、150 人紧急转岗
会议推荐
QCon 全球软件开发大会·2026（上海站）现已正式启动。本届大会聚焦 Harness AI 时代的工程实践，从「构建 AI」到「驾驭 AI」，围绕 AI Native 架构、Agent Runtime、AI Infra、Agent 安全与可观测、Loop Engineering、具身智能与世界模型等热门技术方向，邀请全球技术社区与产业一线实践者，共同分享 AI Native 时代最具价值的工程经验。
