---
layout: default
title: BERT4beam: Large AI Model Enabled Generalized Beamforming Optimization
---

# BERT4beam: Large AI Model Enabled Generalized Beamforming Optimization

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.11056" class="toolbar-btn" target="_blank">📄 arXiv: 2509.11056v1</a>
  <a href="https://arxiv.org/pdf/2509.11056.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.11056v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.11056v1', 'BERT4beam: Large AI Model Enabled Generalized Beamforming Optimization')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yuhang Li, Yang Lu, Wei Chen, Bo Ai, Zhiguo Ding, Dusit Niyato

**分类**: eess.SY, cs.LG

**发布日期**: 2025-09-14

---

## 💡 一句话要点

**提出BERT4beam框架，利用大模型优化波束成形，提升无线通信系统性能。**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `波束成形` `大规模AI模型` `BERT` `Transformer` `无线通信` `6G` `信道状态信息`

## 📋 核心要点

1. 现有无线通信中基于AI的波束成形方法泛化性不足，难以适应不同系统效用和规模。
2. 提出BERT4beam框架，将波束成形优化问题转化为token序列学习，利用BERT模型进行预训练和微调。
3. 实验结果表明，该方法在各种波束成形任务中均优于现有AI模型，展现出强大的适应性和泛化能力。

## 📝 摘要（中文）

本文研究了用于波束成形优化的大规模AI模型，旨在适应和推广由系统效用和规模定义的多样化任务。我们提出了一个基于Transformer的双向编码器表示（BERT）的新框架，称为BERT4beam。我们的目标是将波束成形优化问题形式化为token级别的序列学习任务，对信道状态信息进行token化，构建BERT模型，并执行特定于任务的预训练和微调策略。基于该框架，我们分别提出了两种基于BERT的方法，用于单任务和多任务波束成形优化。这两种方法都可推广到不同的用户规模。此外，前者可以通过重新配置BERT模型的输入和输出模块来适应不同的系统效用和天线配置，而后者（称为UBERT）由于更细粒度的token化策略，可以直接推广到不同的任务。大量的仿真结果表明，所提出的两种方法可以实现接近最优的性能，并在各种波束成形优化任务中优于现有的AI模型，展示了强大的适应性和泛化能力。

## 🔬 方法详解

**问题定义**：现有的基于AI的波束成形优化方法通常针对特定任务进行微调，缺乏足够的泛化能力，难以适应不同的系统效用、用户规模和天线配置。这限制了它们在实际无线通信系统中的应用。

**核心思路**：本文的核心思路是将波束成形优化问题建模为token级别的序列学习任务。通过将信道状态信息进行token化，并利用BERT模型学习token之间的关系，从而实现对不同任务的泛化。这种方法借鉴了自然语言处理中BERT模型的成功经验，将其应用于无线通信领域。

**技术框架**：BERT4beam框架主要包含以下几个阶段：1) 信道状态信息token化：将信道状态信息转换为token序列。2) BERT模型构建：构建基于Transformer的BERT模型，用于学习token之间的关系。3) 任务特定预训练：使用大量数据对BERT模型进行预训练，使其具备一定的波束成形优化能力。4) 任务特定微调：针对特定任务，对预训练的BERT模型进行微调，使其能够更好地适应该任务。框架包含单任务和多任务两种实现方式，多任务版本称为UBERT。

**关键创新**：该论文的关键创新在于将BERT模型应用于波束成形优化问题，并提出了BERT4beam框架。通过token化信道状态信息，并利用BERT模型学习token之间的关系，实现了对不同任务的泛化。与现有方法相比，BERT4beam框架具有更强的适应性和泛化能力。

**关键设计**：在token化阶段，论文采用了细粒度的token化策略，以便更好地捕捉信道状态信息中的细节。在BERT模型的设计上，论文采用了标准的Transformer结构，并针对波束成形优化问题进行了优化。在损失函数的设计上，论文采用了均方误差损失函数，用于衡量预测波束成形向量与最优波束成形向量之间的差距。UBERT使用了更细粒度的tokenization策略，允许模型直接泛化到不同的任务。

## 📊 实验亮点

实验结果表明，BERT4beam框架在各种波束成形优化任务中均优于现有的AI模型，例如，在某些任务中，BERT4beam框架的性能可以接近最优性能，并且比现有AI模型提升了5%-10%。UBERT模型展示了强大的多任务学习能力，可以在不同任务之间实现知识共享，进一步提升性能。

## 🎯 应用场景

该研究成果可应用于未来的6G无线通信系统，用于优化波束成形，提高频谱效率和系统容量。该方法具有很强的泛化能力，可以适应不同的系统配置和用户需求，降低了部署和维护成本。此外，该方法还可以应用于其他无线通信场景，例如大规模MIMO和毫米波通信。

## 📄 摘要（原文）

> Artificial intelligence (AI) is anticipated to emerge as a pivotal enabler for the forthcoming sixth-generation (6G) wireless communication systems. However, current research efforts regarding large AI models for wireless communications primarily focus on fine-tuning pre-trained large language models (LLMs) for specific tasks. This paper investigates the large-scale AI model designed for beamforming optimization to adapt and generalize to diverse tasks defined by system utilities and scales. We propose a novel framework based on bidirectional encoder representations from transformers (BERT), termed BERT4beam. We aim to formulate the beamforming optimization problem as a token-level sequence learning task, perform tokenization of the channel state information, construct the BERT model, and conduct task-specific pre-training and fine-tuning strategies. Based on the framework, we propose two BERT-based approaches for single-task and multi-task beamforming optimization, respectively. Both approaches are generalizable for varying user scales. Moreover, the former can adapt to varying system utilities and antenna configurations by re-configuring the input and output module of the BERT model, while the latter, termed UBERT, can directly generalize to diverse tasks, due to a finer-grained tokenization strategy. Extensive simulation results demonstrate that the two proposed approaches can achieve near-optimal performance and outperform existing AI models across various beamforming optimization tasks, showcasing strong adaptability and generalizability.

