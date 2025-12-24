---
layout: default
title: EEGDM: EEG Representation Learning via Generative Diffusion Model
---

# EEGDM: EEG Representation Learning via Generative Diffusion Model

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.14086" class="toolbar-btn" target="_blank">📄 arXiv: 2508.14086v3</a>
  <a href="https://arxiv.org/pdf/2508.14086.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.14086v3" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.14086v3', 'EEGDM: EEG Representation Learning via Generative Diffusion Model')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Jia Hong Puah, Sim Kuan Goh, Ziwei Zhang, Zixuan Ye, Chow Khuen Chan, Kheng Seang Lim, Si Lei Fong, Kok Sin Woon, Cuntai Guan

**分类**: cs.LG

**发布日期**: 2025-08-13 (更新: 2025-09-01)

**备注**: EEGDM Preprint 10 Pages

**🔗 代码/项目**: [GITHUB](https://github.com/jhpuah/EEGDM)

---

## 💡 一句话要点

**提出EEGDM以解决EEG信号表示学习挑战**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `脑电图` `生成扩散模型` `表示学习` `神经网络` `自监督学习` `癫痫检测` `时间动态`

## 📋 核心要点

1. 现有EEG表示学习方法面临高计算成本和性能提升有限的问题，尤其是在信号变异性和注释不足的情况下。
2. 本文提出了一种基于生成扩散模型的EEG表示学习框架，通过结构化状态空间模型捕捉EEG信号的时间动态。
3. 实验结果表明，EEGDM在癫痫检测任务中优于现有的最先进方法，展示了其有效性和潜力。

## 📝 摘要（中文）

脑电图（EEG）在监测大脑和诊断神经系统疾病（如癫痫）中至关重要，但从原始EEG信号中学习有意义的表示仍然具有挑战性，主要由于注释有限和信号变异性高。近期，EEG基础模型（FMs）通过采用变换器架构和自监督预训练方法展现出潜力，但这些大型模型在训练和推理时的计算成本高，且性能提升有限。本文提出了一种基于生成扩散模型的EEG表示学习框架（EEGDM），通过结构化状态空间模型进行扩散预训练，以更好地捕捉EEG信号的时间动态，并使用去噪扩散概率模型框架进行训练。实验结果表明，EEGDM在多事件数据集上超越了现有方法，显示出其作为EEG基础模型的有前景的替代方案。

## 🔬 方法详解

**问题定义**：本文旨在解决从原始EEG信号中学习有效表示的挑战，现有方法在计算成本和性能提升方面存在不足，尤其是在信号变异性和注释稀缺的情况下。

**核心思路**：提出基于生成扩散模型的EEG表示学习框架（EEGDM），通过结构化状态空间模型（SSMDP）进行扩散预训练，以更好地捕捉EEG信号的时间动态。

**技术框架**：整体架构包括两个主要阶段：首先是使用去噪扩散概率模型（DDPM）进行预训练，然后将得到的潜在EEG表示用于下游分类任务，采用潜在融合变换器（LFT）进行处理。

**关键创新**：最大的技术创新在于结合生成扩散模型与EEG信号的时间动态捕捉能力，显著提升了表示学习的效果，与现有的EEG基础模型相比，提供了更高的性能和更低的计算成本。

**关键设计**：在模型设计中，采用了特定的损失函数和网络结构，以优化潜在表示的学习过程，确保模型在多样化的EEG数据上具有良好的泛化能力。通过精细的参数设置，提升了模型的训练效率和推理速度。

## 📊 实验亮点

实验结果显示，EEGDM在癫痫检测任务中相较于现有的最先进方法，性能提升显著，具体在TUEV和CHB-MIT数据集上均表现出更高的分类准确率，验证了其有效性和优越性。

## 🎯 应用场景

该研究的潜在应用领域包括医疗监测、脑机接口和神经科学研究等。EEGDM能够有效提高癫痫等神经系统疾病的检测准确性，具有重要的实际价值和未来影响，能够推动相关领域的技术进步和应用普及。

## 📄 摘要（原文）

> While electroencephalogram (EEG) has been a crucial tool for monitoring the brain and diagnosing neurological disorders (e.g., epilepsy), learning meaningful representations from raw EEG signals remains challenging due to limited annotations and high signal variability. Recently, EEG foundation models (FMs) have shown promising potential by adopting transformer architectures and self-supervised pre-training methods from large language models (e.g., masked prediction) to learn representations from diverse EEG data, followed by fine-tuning on specific EEG tasks. Nonetheless, these large models often incurred high computational costs during both training and inference, with only marginal performance improvements as the model size increases. In this work, we proposed an EEG representation learning framework building upon Generative Diffusion Model (EEGDM). Specifically, we developed a structured state-space model for diffusion pretraining (SSMDP) to better capture the temporal dynamics of EEG signals and trained it using Denoising Diffusion Probabilistic Model (DDPM) framework. Subsequently, the resulting latent EEG representations were then used for downstream classification tasks via our proposed latent fusion transformer (LFT). To evaluate our method, we used multi-event datasets covering both interictal epileptiform discharges (TUEV) and seizure (CHB-MIT) detection, and compared EEGDM with current state-of-the-art approaches, including EEG FMs. Empirical results showed that our method outperformed the existing methods. These findings suggested that EEGDM offered a promising alternative to current FMs. Our source code and checkpoint are available at: https://github.com/jhpuah/EEGDM.

