# Introducción

En este fichero voy a ir listando repositorios de *GitHub* que me parezcan interesantes. Los voy a ir poniendo en secciones que representarán categorías, e voy a intentar que sean lo más parecidas posible que las categorías
que tengo en los listados de mi cuenta de *YouTube*.

# Listados por categorías

## AI - ANN - LLMs - utilities

 - [ollama](https://github.com/jmorganca/ollama). **Licencia**: <q>MIT license</q>. **Tamaño** (a día 2023-11-08): 8.3M.
   **Descripción** (<q lang="en">About</q>): <q lang="en">Get up and running with Llama 2 and other large language models locally</q>.
   **Mi comentario sobre él**: Permite usar, de una manera parecida a *Docker* (pero, mientras que *Docker* gestiona contenedores que son ejecutados sobre *Linux*, esto gestiona aplicaciones que usan LLMs), aplicaciones
   que hacen uso de LLMs que son ejecutados en local (en la misma máquina en la que este gestor es ejecutado). O sea, facilita mucho esa gestión, ya que ya tiene implementadas muchas funcionalidades que suelen ser comunes
   entre la mayoría de las aplicaciones que usan directamente LLMs libres. En el vídeo [Just RUN AI Models Locally OFFLINE CPU!!!](https://www.youtube.com/watch?v=C0GmAmyhVxM) (del canal
   [1littlecoder](https://www.youtube.com/@1littlecoder)) es posible ver una demo de esto.
   **Añadido a este listado**: 2023-11-09.
   
 - [gpt4all](https://github.com/nomic-ai/gpt4all)
   **Descripción** (<q lang="en">About</q>): <q lang="en">gpt4all: open-source LLM chatbots that you can run anywhere</q>.
   **Mi comentario sobre él**: .
   **Añadido a este listado**: 2024-01-03. **Visto en**: la descripción del vídeo de *YouTube* [How To Install PrivateGPT - Chat With PDF, TXT, and CSV Files Privately! (Quick Setup Guide)](https://www.youtube.com/watch?v=jxSPx1bfl2M), del canal [Matthew Berman](https://www.youtube.com/@matthew_berman)).
   
 - [PrivateGPT](https://github.com/imartinez/privateGPT)
   **Descripción** (<q lang="en">About</q>): <q lang="en">Interact with your documents using the power of GPT, 100% privately, no data leaks</q>.
   **Mi comentario sobre él**: .
   **Añadido a este listado**: 2024-01-03. **Visto en**: el vídeo de *YouTube* [How To Install PrivateGPT - Chat With PDF, TXT, and CSV Files Privately! (Quick Setup Guide)](https://www.youtube.com/watch?v=jxSPx1bfl2M), del canal [Matthew Berman](https://www.youtube.com/@matthew_berman), el cuál tiene una actualización de este tema en el vídeo [PrivateGPT 2.0 - FULLY LOCAL Chat With Docs (PDF, TXT, HTML, PPTX, DOCX, and more)](https://www.youtube.com/watch?v=XFiof0V3nhA).
   
 - [MemGPT](https://github.com/cpacker/MemGPT)
   **Descripción** (<q lang="en">About</q>): <q lang="en">Teaching LLMs memory management for unbounded context 📚🦙</q>.
   **Mi comentario sobre él**: Gestiona la memoria automáticamente, usando el modelo grande de lenguaje como procesador para cargar, y descargar, los datos ("memoria") del contexto del prompt.
   **Añadido a este listado**: 2024-01-03. **Visto en**: el vídeo de *YouTube* [🔮 MemGPT: The Future of LLMs with Unlimited Memory](https://www.youtube.com/watch?v=FS7rEdsu7SE)
   (del canal [AssemblyAI](https://www.youtube.com/@AssemblyAI)) y en muchos otros, como por ejemplo
   [MemGPT 🧠 Giving AI Unlimited Prompt Size (Big Step Towards AGI?)](https://www.youtube.com/watch?v=QQ2QOPWZKVc) y
   [MemGPT + Open-Source Models Tutorial 🔥 Insane Power](https://www.youtube.com/watch?v=QCdQe8CdWV0) (ambos del canal [Matthew Berman](https://www.youtube.com/@matthew_berman))
   
 - [SuperAGI](https://github.com/TransformerOptimus/SuperAGI)
   **Descripción** (<q lang="en">About</q>): <q lang="en"><⚡️> SuperAGI - A dev-first open source autonomous AI agent framework. Enabling developers to build, manage & run useful autonomous agents quickly and reliably.</q>.
   **Mi comentario sobre él**: En las instrucciones de instalación, sólo viene cómo usarlo a través de *Docker*.
   **Añadido a este listado**: 2024-01-03. **Visto en**: el vídeo de *YouTube* [How To Install SuperAGI - Multiple Agents, GUI, Tools, and more!](https://www.youtube.com/watch?v=Unj5NLNTkLY)
   (del canal [Matthew Berman](https://www.youtube.com/@matthew_berman))
   
 - [crewAI](https://github.com/joaomdmoura/crewAI). **Licencia**: <q>MIT license</q>. **Tamaño**: ¿?.
   **Descripción** (<q lang="en">About</q>): <q lang="en">No description, website, or topics provided.</q>.
   **Mi comentario sobre él**: Es un proyecto que a día 2024-01-03 aún está poco maduro, pero están trabajando en él. La idea me gusta, y también me gusta que
                               sea posible usarlo con *Ollama*. La idea principal es crear un capa por encima de *LangChain* para, aprovechando la creación de
                               agentes de *LangChain*, definir varios agentes, cada uno de ellos con sus roles/personajes y herramientas (incluyendo un modelo
                               grande de lenguaje (LLM) específico), sus tareas y unas simples relaciones entre ellos. El objetivo es similar al de *AutoGen*,
                               pero, en su contra, no tiene tantas cosas como *AutoGen*, y a su favor tiene la simplicidad (tanto en su código, por usar
                               *LangChain*, como en el código creado al usar esta biblioteca, ya que los conceptos principales son más simples y claros (esto
                               es debido principalmente a que la coordinación de grupos de agentes en *LangChain* es llevada a cabo por completo por un LLM,
                               a través de un <q>agente proxy</q>, como ellos lo llaman, mientras que aquí, con *CrewAI*, el programador tiene más control sobre
                               eso desde el principio, y por tanto es más fácil de entender cómo el grupo va a funcionar/(ser gestionado). Lo probé el día
                               2024-01-03 con el modelo <q>soler</q> a través de *Ollama+, con un ejemplo muy sencillo, y conseguí que funcionase (para lo cual
                               la documentación me ayudó algo, pero la documentación tampoco está muy madura todavía) pero el resultado fue muy cutre (quizás
                               por culpa del modelo usado). Como la idea de este proyecto me gusta, tengo intención de hacer más pruebas, a ver si consigo algo
                               útil/práctico.
   **Añadido a este listado**: 2024-01-03.
   **Visto en**: el vídeo de *YouTube* [CrewAI is Better than AutoGEN ?? Use with Ollama Openhermes !!](https://www.youtube.com/watch?v=GKr5URJvNDQ)
                 (del canal [Prompt Engineer](https://www.youtube.com/@PromptEngineer48))
   
 - [GPT Pilot](https://github.com/Pythagora-io/gpt-pilot). **Licencia**: <q>MIT license</q>. **Tamaño**: ¿?.
   **Descripción** (<q lang="en">About</q>): <q lang="en">Dev tool that writes scalable apps from scratch while the developer oversees the implementation</q>.
   **Mi comentario sobre él**: Aún no lo he probado.
   **Añadido a este listado**: 2024-01-03.
   **Visto en**: el vídeo de *YouTube* [GPT Pilot ✈️ Build Full Stack Apps with a SINGLE PROMPT (Made for Devs)](https://www.youtube.com/watch?v=iwLe6UWyaS4)
                 (del canal [Matthew Berman](https://www.youtube.com/@matthew_berman)), en el que tiene la siguiente presentación: <q>GPT Pilot allows you to
                 create full-stack applications easily, pairing with AI. GPT Pilot is meant for engineers or engineering teams and allows you to work
                 hand-in-hand with AI to build sophisticated applications step-by-step. It is completely open-source, and they also sponsor this video.</q>.
   
 - [Text generation web UI](https://github.com/oobabooga/text-generation-webui). **Licencia**: <q>AGPL-3.0 license</q>. **Tamaño**: ¿?.
   **Descripción** (<q lang="en">About</q>): <q lang="en">A Gradio web UI for Large Language Models. Supports transformers, GPTQ, AWQ, EXL2, llama.cpp (GGUF), Llama models. </q>.
   **Mi comentario sobre él**: Aún no lo he probado.
   **Añadido a este listado**: 2024-01-17.
   **Visto en**: el vídeo de *YouTube* [How To Install TextGen WebUI - Use ANY MODEL Locally!](https://www.youtube.com/watch?v=VPW6mVTTtTc)
                 (del canal [Matthew Berman](https://www.youtube.com/@matthew_berman)).

## AI - ANN - LLMs - utilities - AutoGen

 - [Ejemplos de AutoGEN_con Ollama](https://github.com/PromptEngineer48/AutoGEN_Ollama). **Licencia**: No está indicada. **Tamaño**: ¿?.
   **Descripción** (<q lang="en">About</q>): <q lang="en">No description, website, or topics provided.</q>.
   **Mi comentario sobre él**: Aún no lo he probado.
   **Añadido a este listado**: 2024-01-03.
   **Visto en**: el vídeo de *YouTube* [Run AutoGEN using Ollama/LiteLLM in SIMPLE Steps | Updated (Use Case)](https://www.youtube.com/watch?v=gx6X5XJ8uH4)
                 (del canal [Prompt Engineer](https://www.youtube.com/@PromptEngineer48))
   
 - [cracecasts](https://github.com/jaredcrace/cracecasts)
   **Descripción** (<q lang="en">About</q>): <q lang="en">Repository for CraceCasts YouTube channel</q>.
   **Mi comentario sobre él**: Contiene el código mostrado en vídeos del canal [CraceCasts](https://www.youtube.com/@CraceCasts), que contiene varios vídeos sobre <q lang="en">web scrapping</q>
                               usando código de *Python* generado con *AutoGen* junto con *Ollama*.
   **Añadido a este listado**: 2024-01-03. **Visto en**: el vídeo de *YouTube* [Search/Read Airbnb with Autogen created Python webscraper](https://www.youtube.com/watch?v=FS7rEdsu7SE)

## AI - ANN - Generative AI - Images - Stable Diffusion

 - [StreamDiffusion](https://github.com/cumulo-autumn/StreamDiffusion). **Licencia**: <q>Apache-2.0 license</q>. **Tamaño**: ¿?.
   **Descipción** (<q lang="en">About</q>): <q lang="en">StreamDiffusion: A Pipeline-Level Solution for Real-Time Interactive Generation </q>.
   **Mi comentario sobre él**: Aún no lo he probado pero tiene una pintaza.
   **Añadido a este listado**: 2024-01-02. **Visto en**: [Artículo de *Medium*: *Paper Review: StreamDiffusion: A Pipeline-Level Solution for Real-Time Interactive Generation*](https://artgor.medium.com/paper-review-streamdiffusion-a-pipeline-level-solution-for-real-time-interactive-generation-849d6481259a)

## AI - ANN - for computer vision - YOLO

 - [YOLO3D](https://github.com/ruhyadi/YOLO3D). **Licencia**: No indicada. **Tamaño**: ¿?.
   **Descipción** (<q lang="en">About</q>): <q lang="en">YOLO 3D Object Detection for Autonomous Driving Vehicle</q>.
   **Mi comentario sobre él**: Aún no lo he probado.
   **Añadido a este listado**: 2024-01-03.
   **Visto en**: el vídeo de *YouTube* [Object detection using Yolo3D with ROS2](https://www.youtube.com/watch?v=KTCtTLwJXP0)
                 (del canal [robot mania](https://www.youtube.com/@robotmania8896); el código de ese vídeo está en
                 [este enlace](https://drive.google.com/drive/folders/1SyyDtQC7LpSIld-jmtkI1qXXDnLNDg6w), que está puesto en su descripción)

## AI - ANN - for voice

 - [Coqui TTS](https://github.com/coqui-ai/TTS). **Licencia**: MPL-2.0 license. **Tamaño**: ¿?.
   **Descipción** (<q lang="en">About</q>): <q lang="en">🐸💬 - a deep learning toolkit for Text-to-Speech, battle-tested in research and production</q>.
   **Mi comentario sobre él**: Aún no lo he probado.
   **Añadido a este listado**: 2024-01-03.
   **Visto en**: el vídeo de *YouTube* [Free Speech: Reviewing Coqui-ai, Mycroft Mimic3 and Tortoise TTS Libraries](https://www.youtube.com/watch?v=JZWeYbtCisk)
                 (del canal [Learn Code With JV](https://www.youtube.com/@LearnCodeWithJV))

 - [mimic3](https://github.com/MycroftAI/mimic3). **Licencia**: AGPL-3.0 license. **Tamaño**: ¿?.
   **Descipción** (<q lang="en">About</q>): <q lang="en">A fast local neural text to speech engine for Mycroft</q>.
   **Mi comentario sobre él**: Lo he probado el día 2023-01-04 y, aunque no es perfecto, está muy bien. La entonación es bastante buena (incluso perfecta la mayor
                               parte del tiempo) y la velocidad de generación es más que de sobra (en un Intel(R) Core(TM) i7-11800H @ 2.30GHz) para tiempo real.
                               Lo he probado en inglés y en castellano, y la primera vez, que es usado en cada idioma, baja la red neuronal correspondiente al
                               idioma usado (por defecto es el inglés, y para usar otro hay que indicar (con la opción <q>--voice</q>) una <q>voz</q> adecuada para
                               él; la opción, para listar las voces disponibles, es <q>--voices</q>).
   **Añadido a este listado**: 2024-01-03.
   **Visto en**: el vídeo de *YouTube* [Free Speech: Reviewing Coqui-ai, Mycroft Mimic3 and Tortoise TTS Libraries](https://www.youtube.com/watch?v=JZWeYbtCisk)
                 (del canal [Learn Code With JV](https://www.youtube.com/@LearnCodeWithJV))
 
 - [piper](https://github.com/rhasspy/piper). **Licencia**: MIT license. **Tamaño**: ¿?.
   **Descipción** (<q lang="en">About</q>): <q lang="en">A fast, local neural text to speech system</q>.
   **Mi comentario sobre él**: Aún no lo he probado.
   **Añadido a este listado**: 2024-01-03.
   **Visto en**: la descripción del vídeo de *YouTube* [Free Speech: Reviewing Coqui-ai, Mycroft Mimic3 and Tortoise TTS Libraries](https://www.youtube.com/watch?v=JZWeYbtCisk)
                 (del canal [Learn Code With JV](https://www.youtube.com/@LearnCodeWithJV)), citado como sustituto de *mimic3* (del mismo autor).
 
 - [tortoise-tts](https://github.com/neonbjb/tortoise-tts). **Licencia**: Apache-2.0 license. **Tamaño**: ¿?.
   **Descipción** (<q lang="en">About</q>): <q lang="en">A multi-voice TTS system trained with an emphasis on quality</q>.
   **Mi comentario sobre él**: Aún no lo he probado.
   **Añadido a este listado**: 2024-01-03.
   **Visto en**: el vídeo de *YouTube* [Free Speech: Reviewing Coqui-ai, Mycroft Mimic3 and Tortoise TTS Libraries](https://www.youtube.com/watch?v=JZWeYbtCisk)
                 (del canal [Learn Code With JV](https://www.youtube.com/@LearnCodeWithJV))
 
 - [jenny-tts-dataset](https://github.com/dioco-group/jenny-tts-dataset). **Licencia**: No está indicada. **Tamaño**: ¿?.
   **Descipción** (<q lang="en">About</q>): <q lang="en">A high-quality, varied ~30hr voice dataset suitable for training a TTS model</q>.
   **Mi comentario sobre él**: Aún no lo he ni bajado.
   **Añadido a este listado**: 2024-01-03.
   **Visto en**: el vídeo de *YouTube* [Free Speech: Reviewing Coqui-ai, Mycroft Mimic3 and Tortoise TTS Libraries](https://www.youtube.com/watch?v=JZWeYbtCisk)
                 (del canal [Learn Code With JV](https://www.youtube.com/@LearnCodeWithJV))
   
