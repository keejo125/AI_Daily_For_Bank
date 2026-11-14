---
publish_time: 1794630297
link: https://mp.weixin.qq.com/s/ak3-eRYx8IFAmE6HcWUsVA
source: InfoQ
status: confirmed
category: 国际
is_model_related: false
digest: |
  在AGNTCon+MCPCon 2026上，Agentic AI Foundation（AAIF）一年内从3个创始项目扩至10个：阿里贡献OpenSandbox，OpenAI贡献Open Responses互操作规范，Anthropic加入Agent Skills，Hugging Face贡献OpenEnv。文章指出，OpenAI、Anthropic、Google虽各自把搜索、文件、工具执行整合进API，但协议仍未统一：Anthropic仍定义自有Messages API，Google有Interactions API。围绕MCP，演讲聚焦身份、证明、审计与支付等开放性问题，并呼吁将信任从模型移入协议、网关与可验证身份。
title: OpenAI、Anthropic、Google 各有接口，开放标准离统一还有多远？
---

# OpenAI、Anthropic、Google 各有接口，开放标准离统一还有多远？

来源：InfoQ
原文链接：https://mp.weixin.qq.com/s/ak3-eRYx8IFAmE6HcWUsVA

作者 ｜ Mark Silvester
译者 ｜ 田橙
在圣何塞举行的 AGNTCon + MCPCon North America 2026 上，Agentic AI Foundation（AAIF）新增了四个项目，使其在成立第一年内从 三个创始项目 发展到十个项目。这场于 10 月 22 日至 23 日举行的活动紧随同一场地举办的 PyTorch Conference 之后，其议程重点很大程度上从协议新功能转向了安全和身份议题。
AAIF 执行董事 Mazin Gilbert 在开幕演讲中宣布了项目动态以及三个新的治理委员会。Alibaba 贡献了 OpenSandbox，这是一个用于运行智能体的安全沙箱；OpenAI 贡献了 Open Responses，这是一项用于实现 LLM 接口互操作性的开放规范。Anthropic 加入了 Agent Skills，Hugging Face 则加入了 OpenEnv，这是一个用于训练和评估智能体的强化学习环境框架。基金会首席技术官 Manik Surtani 在公告中这样概括这一里程碑：
一年前，AAIF 携三个项目成立，并押注智能体 AI 需要一个中立的家园才能蓬勃发展。如今，我们托管着十个项目。
在题为“谁来保持它的开放性？”的演讲中，Surtani 认为，仅有许可证并不能确保基础设施保持开放。他将始终由一家公司控制的 Android，与 Google 移交给中立基金会的 Kubernetes 进行了对比。当前尚待解决的开放性问题集中在身份、证明、审计和支付方面。
外部媒体的报道则较为冷静。The New Stack 指出，Open Responses 已经获得 AWS Bedrock、Databricks、Ollama、Nvidia 和 vLLM 的支持，但 Anthropic 仍在定义自己的 Messages API，Google 也有自己的 Interactions API。The Register 以“供应商关联的 AI 智能体技术被友好且资金充足的基金会接纳”为标题进行报道，并在结尾警告道：
这种对 AI 智能体充满热情——或者说轻信——的接受速度，对某些行业而言可能有些过快。
成立仅 11 周的 Tokenomics Foundation 执行董事 J.R. Storment 告诉现场观众，不要再计算 Token 数量。每项任务的成本优于每个 Token 的成本，每项结果的成本则更进一步，但真正应该衡量的是业务价值。
Anthropic 的 MCP 联合创建者 David Soria Parra 认为，如今能力强大的模型更需要连接能力，而不是帮助它们专注于任务。7 月 28 日的规范新增了无状态服务器，一些开发者担心 这会让 MCP 变成又一个普通 API，而部分平台已经有约 70% 的流量采用这种模式。Soria Parra 宣布 Claude Code 支持 MCP Tasks，让工具调用可以持续数分钟、数小时甚至数天，而不再只是数秒。Anthropic 还将 Agent Skills 标准捐赠给基金会。该项目的 路线图 列出了五个优先领域，涵盖智能体消息、通过 MCP 使用 Skills、身份以及 HTTP 原生传输等方向。
OpenAI 的 Thomas Sarlandie 分享了从 ChatGPT 插件目录中观察到的 MCP 服务器生产使用情况。工具数量实际上没有上限，但过大的 Schema 会被裁剪，最先被删除的是参数描述。已发布服务器中约四分之三的工具 Schema 小于 1KB，而最大的单个工具 Schema 约为 260KB，单个服务器则可达到 1.4MB。OpenAI 会拒绝所有未给每个工具添加注解的服务器提交；这些注解可以让 ChatGPT 快速处理只读调用，并在执行破坏性操作前请求确认。只有 56% 的插件使用服务器指令，Sarlandie 表示，这些指令可以安全地扩展到约 1,000 个字符。
Chrome 的 Sarah Drasner 介绍了 WebMCP，这是一项目前正在进行源试用的拟议 Web 标准，允许网站向智能体公开工具。智能体可以调用已经声明的工具，而不是抓取 DOM；Drasner 援引的基准测试显示，操作速度可提高 2.5 至 7.5 倍。只读提示和不受信任内容提示也可以帮助智能体抵御隐藏在用户评论中的提示词注入。Drasner 强调，WebMCP 是对 MCP 的补充，而不是取代 MCP。
加州大学伯克利分校教授 Dawn Song 认为，短期内，前沿 AI 给攻击者带来的帮助将超过防御者。Song 的 CyberGym 基准测试涵盖近 200 个开源项目中的 1,500 多个漏洞，而模型现在已经能够发现零日漏洞。在 ExploitGym 上，GPT-5.6 Sol 在两小时内针对 869 个目标生成了约 230 个可运行的漏洞利用；即使启用标准安全缓解措施后，仍能生成 80 多个。由于攻击者只需找到一个漏洞，Song 呼吁构建默认安全的系统，使用 AI 生成的证明，并提到一个用于追踪这些能力的新 观测平台。
Anthropic 的 Den Delimarsky 是该协议的首席维护者，他表示 SDK 的累计下载量已达到 41.7 亿次。大约一个月前，这一数字还是 30 亿次；Delimarsky 表示，这让每一个安全缺口都变得更加重要。在 116 个一致性测试场景中，约三分之一目前用于测试安全性，而 企业托管授权 功能已经在 Claude 中上线。在 Delimarsky 展示的身份验证路线图中，该功能被标记为稳定；持有证明令牌和工作负载身份联合仍处于草案阶段；最终目标则是让智能体以自身身份登录。
Goose 创建者、Block 的 Bradley Axen 演示了 Buzz，这是一个让人与智能体共享频道的开源工作空间。每个智能体都拥有自己的身份，以及一份注明其所有者的证明；它们可以读取频道，但不能读取私信。Buzz 拥有 8 万个社区和 3.6 万颗 GitHub Star，1.0 版本计划于 11 月中旬发布。
GitHub 前首席执行官、现任 Entire 首席执行官 Thomas Dohmke 表示，智能体已经让代码审查成为瓶颈。Dohmke 援引行业数据指出，使用编码智能体的团队每周会创建约 57 个 Pull Request，而其他团队约为 10 个。Dohmke 希望将智能体会话日志存储在 Git 中并与提交关联，让审查人员能够根据变更的原始意图检查代码。
Tim O'Reilly 将 MCP 称为 AI 领域的“参与式架构”，并认为它延续了 Unix 的传统。O'Reilly 指出，AI 经济仍然缺少相应的运行机制，就像 Web 曾经需要按点击付费的广告和安全支付一样。他将解决方案描述为机制设计，也就是“逆向博弈论”：从期望得到的结果出发，反向推导能够产生这一结果的规则。他传达的信息是，应将信任从模型中移出，放入协议、网关和可验证身份之中。
对于运行 MCP 服务器的团队而言，实践建议十分具体：为每个工具添加注解、保持 Schema 小巧，并为智能体携带自身身份而不是借用用户 Token 做好准备。演讲中的部分数据缺少已公开的支撑材料，一些安全扩展也仍处于草案阶段。希望进一步了解相关内容的开发者，可以观看 第一天 和 第二天 的主题演讲直播，或者阅读基金会的 项目页面。下一届 AGNTCon + MCPCon 活动将分别于 2027 年 4 月 28 日至 29 日在旧金山，以及 9 月 15 日至 16 日在伦敦举行。
原文链接：
https://www.infoq.com/news/2026/10/agntcon-mcpcon-2026/
END
转发，点赞，在看，安排一下？
今日好文推荐
Anthropic团队零Rust经验起步，靠Claude完成核心API跨语言重构：CPU省40%，延迟降20%
黄仁勋辞职后，英伟达员工坐不住了：1600多条评论要求“把老板请回来”
马斯克喊话“真男人自己管理内存”，三十年系统老将警告：Rust 也拦不住 AI 制造复杂性
Token 越烧越多，利润却没涨：李彦宏要重新设计企业组织
