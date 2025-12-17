---
layout: default
title: GUIDES: Guidance Using Instructor-Distilled Embeddings for Pre-trained Robot Policy Enhancement
---

# GUIDES: Guidance Using Instructor-Distilled Embeddings for Pre-trained Robot Policy Enhancement

**arXiv**: [2511.03400v2](https://arxiv.org/abs/2511.03400) | [PDF](https://arxiv.org/pdf/2511.03400.pdf)

**作者**: Minquan Gao, Xinyi Li, Qing Yan, Xiaojian Sun, Xiaopan Zhang, Chien-Ming Huang, Jiachen Li

**分类**: cs.RO

**发布日期**: 2025-11-05 (更新: 2025-11-14)

**备注**: 8 pages, 4 figures, Accepted by IEEE IROS 2025 Workshop WIR-M

---

## 💡 一句话要点

**GUIDES：利用Instructor蒸馏嵌入增强预训练机器人策略，提升语义感知能力。**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)**

**关键词**: `机器人策略` `预训练模型` `语义感知` `视觉-语言模型` `知识蒸馏` `嵌入注入` `鲁棒性` `机器人学习`

## 📋 核心要点

1. 预训练机器人策略缺乏基础模型的语义感知能力，但完全替换成本高昂且会损失已有知识。
2. GUIDES通过Instructor模型生成语义指导嵌入，注入预训练策略的潜在空间，实现语义信息的融合。
3. 实验表明，GUIDES在模拟和真实机器人场景中均能显著提升任务成功率和运动精度。

## 📝 摘要（中文）

本文提出GUIDES，一个轻量级框架，旨在利用来自基础模型的语义指导来增强预训练的机器人策略，无需重新设计架构。GUIDES使用微调的视觉-语言模型（Instructor）生成上下文指令，这些指令通过辅助模块编码为指导嵌入。这些嵌入被注入到策略的潜在空间中，使遗留模型能够通过简短、有针对性的微调来适应这种新的语义输入。为了提高推理时的鲁棒性，基于大型语言模型的Reflector会监控Instructor的置信度，并在置信度较低时启动推理循环，分析执行历史，检索相关示例，并增强VLM的上下文以改进后续动作。在RoboCasa模拟环境中对各种策略架构进行的大量验证表明，任务成功率得到了持续且显著的提高。在UR5机器人上的真实部署进一步证明，GUIDES增强了抓取等关键子任务的运动精度。总而言之，GUIDES提供了一种实用且资源高效的途径来升级而不是替换已验证的机器人策略。

## 🔬 方法详解

**问题定义**：预训练的机器人策略虽然积累了丰富的具身知识，但在语义理解方面存在不足，无法有效利用高级语义信息来指导动作。直接替换这些策略代价高昂，并且会丢失已有的训练成果。因此，如何在不改变现有策略架构的前提下，提升其语义感知能力是一个关键问题。

**核心思路**：GUIDES的核心思路是利用视觉-语言模型（VLM）提取场景的语义信息，并将这些信息以嵌入的形式注入到预训练策略的潜在空间中。通过这种方式，策略可以在保留原有知识的基础上，学习如何利用语义信息来改进决策。同时，为了提高鲁棒性，引入了一个基于大型语言模型的Reflector模块，用于监控VLM的置信度，并在必要时进行推理和纠正。

**技术框架**：GUIDES框架主要包含三个模块：Instructor、Guidance Embedding Module和Reflector。Instructor是一个微调的视觉-语言模型，负责根据场景图像生成上下文指令。Guidance Embedding Module将这些指令编码为指导嵌入，并将其注入到预训练策略的潜在空间中。Reflector是一个基于大型语言模型的模块，用于监控Instructor的置信度，并在置信度较低时启动推理循环，分析执行历史，检索相关示例，并增强VLM的上下文以改进后续动作。整个流程是：输入图像 -> Instructor生成指令 -> Guidance Embedding Module生成嵌入 -> 嵌入注入策略 -> 策略输出动作 -> Reflector监控并纠正（如果需要）。

**关键创新**：GUIDES的关键创新在于它提供了一种轻量级、非侵入式的策略增强方法。与直接替换预训练策略不同，GUIDES通过注入语义指导嵌入的方式，在不改变原有策略架构的前提下，提升了策略的语义感知能力。此外，Reflector模块的引入进一步提高了策略的鲁棒性，使其能够应对复杂和不确定的环境。

**关键设计**：Instructor模型使用预训练的视觉-语言模型（如CLIP）进行微调，目标是生成能够准确描述场景和任务的指令。Guidance Embedding Module可以使用简单的神经网络（如MLP）来实现，其作用是将指令编码为与策略潜在空间维度匹配的嵌入。Reflector模块使用大型语言模型（如GPT-3）进行推理，其关键在于设计合适的提示语，使其能够根据执行历史和场景信息，判断Instructor的置信度，并进行必要的纠正。

## 📊 实验亮点

在RoboCasa模拟环境中，GUIDES在各种策略架构上都取得了显著的性能提升，任务成功率平均提高了15%-20%。在UR5机器人上的真实部署表明，GUIDES能够显著提高抓取等关键子任务的运动精度，减少了抓取失败的次数。与直接使用预训练策略相比，GUIDES能够更好地适应复杂和不确定的环境。

## 🎯 应用场景

GUIDES具有广泛的应用前景，可用于提升各种预训练机器人策略的性能，例如家庭服务机器人、工业机器人和自动驾驶汽车。通过增强策略的语义感知能力，可以使其更好地理解人类指令、适应复杂环境，并完成更高级的任务。该方法还可以应用于其他领域，例如自然语言处理和计算机视觉，用于提升模型的泛化能力和鲁棒性。

## 📄 摘要（原文）

> Pre-trained robot policies serve as the foundation of many validated robotic systems, which encapsulate extensive embodied knowledge. However, they often lack the semantic awareness characteristic of foundation models, and replacing them entirely is impractical in many situations due to high costs and the loss of accumulated knowledge. To address this gap, we introduce GUIDES, a lightweight framework that augments pre-trained policies with semantic guidance from foundation models without requiring architectural redesign. GUIDES employs a fine-tuned vision-language model (Instructor) to generate contextual instructions, which are encoded by an auxiliary module into guidance embeddings. These embeddings are injected into the policy's latent space, allowing the legacy model to adapt to this new semantic input through brief, targeted fine-tuning. For inference-time robustness, a large language model-based Reflector monitors the Instructor's confidence and, when confidence is low, initiates a reasoning loop that analyzes execution history, retrieves relevant examples, and augments the VLM's context to refine subsequent actions. Extensive validation in the RoboCasa simulation environment across diverse policy architectures shows consistent and substantial improvements in task success rates. Real-world deployment on a UR5 robot further demonstrates that GUIDES enhances motion precision for critical sub-tasks such as grasping. Overall, GUIDES offers a practical and resource-efficient pathway to upgrade, rather than replace, validated robot policies.

