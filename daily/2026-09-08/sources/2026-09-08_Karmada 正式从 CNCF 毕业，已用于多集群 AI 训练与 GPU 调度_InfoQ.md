---
publish_time: 1788856272
link: https://www.infoq.cn/article/yfQdTa8cRxjJB0rzZMJR
source: InfoQ
status: confirmed
category: 国内
is_model_related: false
digest: |
  在 KubeCon + CloudNativeCon + OpenInfra Summit + PyTorch Conference China 2026 期间，CNCF 宣布多集群 Kubernetes 编排项目 Karmada 正式毕业（Graduated）。Karmada 解决 Kubernetes 从单集群扩展到多集群后的应用编排问题，提供集中部署、资源分发、故障转移与多集群自动伸缩，其场景正从多云管理走向 AI Infra——用于多集群 AI 训练与 GPU 调度。
---

# Karmada 正式从 CNCF 毕业，已用于多集群 AI 训练与 GPU 调度

> 原文链接：https://www.infoq.cn/article/yfQdTa8cRxjJB0rzZMJR
> 来源：InfoQ

9 月 8 日，在上海举行的 KubeCon + CloudNativeCon + OpenInfra Summit + PyTorch Conference China 2026 大会期间，云原生计算基金会（CNCF）宣布，多集群 Kubernetes 编排项目 Karmada" 正式毕业（Graduated）。

从 2021 年进入 CNCF Sandbox，到 2023 年晋升 Incubating，再到此次毕业，Karmada 用约五年时间完成了 CNCF 项目成熟度体系中的主要阶段。目前，该项目已经拥有超过 1214 名贡献者，贡献者来自 292 家组织，GitHub Star 超过 5600。

Karmada 是“Kubernetes Armada”的简称，主要解决 Kubernetes 从单集群扩展到多集群、多云和多区域之后的应用编排问题。它建立在标准 Kubernetes API 之上，在不要求应用修改原有 Kubernetes 资源定义的情况下，提供集中部署、资源分发、故障转移、多集群自动伸缩等能力。

对于企业而言，这意味着原本分散在不同数据中心、公有云或地域中的 Kubernetes 集群，可以进一步被组织成统一的资源池，并在上层进行工作负载调度和资源管理。

从多云编排走向 AI Infra

如今，Kubernetes 多集群管理正在进入新的应用阶段。Karmada 的应用场景也在从传统的多云、多集群管理，进一步延伸到 AI 基础设施。

过去，多集群更多用于混合云、跨地域容灾和资源扩展。但随着大模型训练和推理越来越依赖大规模 GPU 集群，计算资源开始同时分散在不同区域、不同云以及不同类型的加速器中，多集群调度逐渐成为 AI 基础设施需要解决的问题之一。

Karmada 最新的 v1.19 版本已经开始强化这部分能力。该版本增强了针对分布式 AI 训练任务的多组件调度，并将基于优先级的调度能力提升至 Beta 阶段且默认启用。在 GPU 等稀缺资源竞争激烈的场景下，平台可以按照任务优先级决定哪些工作负载优先获得资源。

按照 Karmada 公布的 2026 年路线图，后续还将继续推进基于优先级的抢占、多集群 AI 训练与批处理任务队列，以及 Kubernetes Dynamic Resource Allocation（DRA，动态资源分配）在 GPU 和其他加速器上的多集群支持。

这意味着 Karmada 的定位正在从最初的“跨集群工作负载分发”，进一步向能够感知资源类型、任务优先级和异构计算资源的多集群控制平面演进。

Karmada Maintainer Hongcai Ren 表示，目前 Karmada 已经被用于从微服务、大数据到 AI 等不同场景。项目下一阶段也将继续围绕 AI 与 Agent 基础设施带来的新问题展开。

已进入 Bloomberg、携程等生产环境

CNCF 项目毕业并不仅意味着功能成熟，也要求项目在治理、安全、社区活跃度以及生产采用等方面达到相应标准。

目前 Karmada 已经拥有来自六家组织的 Maintainer。其生产用户覆盖云计算、互联网、通信、AI、旅游、物流和设备制造等领域，包括 Alibaba Cloud、Bilibili、Huawei、iFLYTEK、JDCloud、Kuaishou、RedNote、SenseTime、Trip.com、Vivo、WPS、ZTO，以及 Bloomberg、Wellhub 等。

这些用户的实际使用场景也已经不再局限于简单的多集群应用发布，而包括混合云容量管理、多区域容灾、智能流量分发、AI 训练、GPU/CPU 调度以及跨集群配置分发等。

Bloomberg Streaming Platform Engineering Team Lead，同时也是 Karmada Maintainer 的 Michas Szacillo 表示，Bloomberg 已经利用 Karmada 自动化灾难恢复、提高资源利用率，并简化多个 Kubernetes 集群的管理。

Trip.com Senior Development Expert Honghui Yue 则表示，Trip.com 使用 Karmada 将多个 Kubernetes 集群作为统一资源池运行，在不修改现有 Kubernetes 资源定义的情况下实现跨集群弹性、故障转移以及大规模工作负载迁移。

在生态兼容方面，Karmada 控制平面能够直接导出 Prometheus 指标，控制平面状态通过 etcd 保存，并提供 Helm Chart 用于部署，与现有 Kubernetes 和 CNCF 工具链保持兼容。

从 CNCF 毕业意味着什么？

在 CNCF 项目体系中，Graduated 是目前最高的成熟度等级。为了达到这一阶段，Karmada 完成了第三方安全审计，建立了正式 Steering Committee，并采用 CNCF Code of Conduct，同时继续保持 Core Infrastructure Initiative（CII）Best Practices Badge。

CNCF CTO Chris Aniszczyk 表示，随着 Kubernetes 被扩展到越来越多的集群以及 GPU 资源紧张的 AI 环境，如何以生产级方式协调这些资源已经成为新的基础设施问题，而此次毕业意味着 Karmada 在技术成熟度、治理和安全实践方面已经达到 CNCF 对成熟项目的要求。

值得关注的是，Karmada 此次毕业，也恰逢 Kubernetes 基础设施需求进一步向多集群、异构算力和 AI 场景延伸。

过去几年，Kubernetes 主要解决单个集群内部的容器编排问题；随着企业基础设施逐渐跨数据中心、跨云、跨地域，乃至扩展到 GPU、NPU 等异构算力资源，新的挑战正在从“如何管理一个集群”，转向“如何管理一组甚至大规模集群”。

AI 训练和推理对算力规模、资源利用率以及故障恢复能力的要求，又进一步放大了这一问题。

对于 Karmada 而言，CNCF 毕业更像是一个阶段性节点。它已经证明了多集群 Kubernetes 编排在传统生产环境中的可行性，接下来更值得观察的是，这套架构能否继续适应 AI Infra 中更加复杂的 GPU 调度、异构资源管理和跨集群任务编排需求。